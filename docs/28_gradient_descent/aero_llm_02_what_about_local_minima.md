
<!-- Aero-Navigation-Start -->
[🏠 Home](../../index.md) > [28 gradient descent](../index.md)

---
### 🧭 Điều hướng nhanh

- [🏠 Cổng tài liệu](../../index.md)
- [📚 Module 01: LLM Course](../../01_llm_course/index.md)
- [🔢 Module 02: Tokenization](../../02_words_to_tokens_to_numbers/index.md)
- [🏗️ Module 04: Build GPT](../../04_buildgpt/index.md)
- [🎯 Module 07: Fine-tuning](../../07_fine_tune_pretrained_models/index.md)
- [🔍 Module 19: AI Safety](../../19_ai_safety/index.md)
- [🐍 Module 20: Python for AI](../../20_python_colab_notebooks/index.md)
---
<!-- Aero-Navigation-End -->
# Học sâu: Vấn đề Cực trị Địa phương (Local Minima)

## Tóm tắt (Abstract)
Báo cáo này nghiên cứu về một trong những thách thức kinh điển của thuật toán Hạ giang (Gradient Descent): hiện tượng bị kẹt tại các cực trị địa phương (local minima). chúng ta phân tích sự khác biệt giữa cực tiểu toàn cục (global minimum) và cực tiểu địa phương, giải mã lý do tại sao gradient descent có xu hướng hội tụ về các thung lũng gần nhất thay vì tìm kiếm giải pháp tối ưu nhất. Nghiên cứu cũng thảo luận về nghịch lý của không gian cao chiều trong học sâu, nơi các điểm yên ngựa (saddle points) và số lượng tham số khổng lồ có thể vô tình trở thành "lớp bảo vệ" giúp mô hình tránh khỏi các bẫy cực trị địa phương thường thấy ở không gian thấp chiều.

---

## 1. Bản chất của Cực trị Địa phương

Trong một bề mặt lỗi (loss landscape) phức tạp:
- **Global Minimum:** Là điểm mà tại đó hàm mất mát đạt giá trị nhỏ nhất trên toàn bộ không gian tham số. Đây là mục tiêu cuối cùng của quá trình huấn luyện.
- **Local Minima:** Là những thung lũng mà tại đó giá trị hàm lỗi thấp hơn các vùng lân cận nhưng cao hơn so với Global Minimum. 
- **Cơ chế bẫy:** Vì Gradient Descent chỉ "nhìn" thấy độ dốc cục bộ, nếu mô hình bắt đầu tại một vị trí gần một Local Minimum, nó sẽ bị hút vào đó và không thể thoát ra được do đạo hàm ở đáy thung lũng bằng 0.

---

## 2. Nghịch lý của Không gian Đa chiều

Một khám phá thú vị trong nghiên cứu học sâu hiện đại là: vấn đề cực trị địa phương có thể không nghiêm trọng như chúng ta tưởng tượng khi số lượng chiều tăng lên.
- **Điều kiện khắt khe:** Để một điểm trở thành Local Minimum trong không gian 1.000.000 chiều, đạo hàm của nó phải bằng 0 và độ cong phải hướng lên trên ở **tất cả** 1.000.000 hướng đó. 
- **Saddle Points (Điểm yên ngựa):** Thực tế, hầu hết các điểm tới hạn trong không gian cao chiều là điểm yên ngựa – nơi hàm số đạt cực tiểu theo một số hướng nhưng lại đạt cực đại theo các hướng khác. Điều này cho phép thuật toán "lách" qua và tiếp tục đi xuống thay vì bị kẹt lại.
- **Kết luận:** Số lượng tham số càng lớn (dimensionality cao), xác suất tồn tại một Local Minimum thực thụ càng giảm đi một cách đáng kể.

---

## 3. Tại sao Deep Learning vẫn thành công?

Mặc dù có nguy cơ bị kẹt, Deep Learning vẫn đạt được những thành tựu rực rỡ nhờ vào các đặc thù sau:
1. **Sự tồn tại của nhiều giải pháp tốt:** Có thể có nhiều Local Minima khác nhau nhưng có hiệu năng tương đương và đủ tốt để giải quyết bài toán thực tế.
2. **Khởi tạo ngẫu nhiên:** Việc huấn luyện mô hình nhiều lần với các trọng số khởi tạo khác nhau giúp chúng ta có cơ hội bắt đầu ở những vùng thung lũng sâu hơn.
3. **Độ phức tạp là một lợi thế:** Việc tăng kích thước mô hình (tăng số lượng tham số) thực chất giúp làm "phẳng" bề mặt lỗi và giảm bớt các bẫy cực trị địa phương.

---

## 4. Giải pháp kỹ thuật đối phó với Local Minima

Nếu nghi ngờ mô hình đang bị kẹt ở một nghiệm kém chất lượng, các nhà nghiên cứu thường áp dụng:
- **Multiple Restarts:** Huấn luyện lại mô hình nhiều lần và chọn kết quả tốt nhất.
- **Momentum (Quán tính):** Bổ sung yếu tố quán tính vào bước cập nhật giúp mô hình có khả năng "vượt dốc" để thoát khỏi các thung lũng nông.
- **Lựa chọn kiến trúc:** Sử dụng các mô hình có độ rộng và độ sâu lớn để tận dụng ưu thế của không gian cao chiều.

---

## 5. Kết luận
Cực trị địa phương là một khái niệm toán học đáng sợ nhưng trong thế giới của học sâu hiện đại, nó dường như không còn là "kẻ hủy diệt" mô hình. Sự tương tác giữa giải tích cao chiều và các kỹ thuật khởi tạo thông minh đã biến những cạm bẫy này thành những thử thách có thể vượt qua. Thấu hiểu bản chất của Saddle Points và vai trò của dimensionality giúp các kỹ sư AI tự tin hơn trong việc xây dựng những mô hình LLM với hàng tỷ tham số, nơi mà sự phức tạp chính là chìa khóa để tìm ra những giải pháp tối ưu.

---

## Tài liệu tham khảo (Citations)
1. Phân tích bẫy cực trị địa phương và vai trò của điểm yên ngựa dựa trên `aero_LL_02_What about local minima.md`. Thuyết minh về dimensionality trong không gian tham số tỷ đơn vị và các chiến lược thoát khỏi cực trị địa phương.
<!-- Aero-Footer-Start -->

## 📄 Tài liệu cùng chuyên mục
| Bài học | Liên kết |
| :--- | :--- |
| [Học sâu: Tổng quan về Thuật toán Hạ giang (Gradient Descent)](aero_llm_01_overview_of_gradient_descent.md) | [Xem bài viết →](aero_llm_01_overview_of_gradient_descent.md) |
| 📌 **[Học sâu: Vấn đề Cực trị Địa phương (Local Minima)](aero_llm_02_what_about_local_minima.md)** | [Xem bài viết →](aero_llm_02_what_about_local_minima.md) |
| [Học sâu: Thực thi Hạ giang trong Không gian 1 Chiều (1D Gradient Descent)](aero_llm_03_gradient_descent_in_1d.md) | [Xem bài viết →](aero_llm_03_gradient_descent_in_1d.md) |
| [Học sâu: Hạ giang trong Không gian 2 Chiều (2D Gradient Descent)](aero_llm_04_gradient_descent_in_2d.md) | [Xem bài viết →](aero_llm_04_gradient_descent_in_2d.md) |
| [Học sâu: Thử thách Lập trình – Tốc độ học Cố định vs. Động (Fixed vs. Dynamic Learning Rate)](aero_llm_05_codechallenge_fixed_vs_dynamic_learning_rate.md) | [Xem bài viết →](aero_llm_05_codechallenge_fixed_vs_dynamic_learning_rate.md) |

---
## 🤝 Liên hệ & Đóng góp
Dự án được phát triển bởi **Pixibox**. Mọi đóng góp về nội dung và mã nguồn đều được chào đón.

> *"Kiến thức là để chia sẻ. Hãy cùng nhau xây dựng cộng đồng AI vững mạnh!"* 🚀

*Cập nhật tự động bởi Aero-Indexer - 2026*
<!-- Aero-Footer-End -->
