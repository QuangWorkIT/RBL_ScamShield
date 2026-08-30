# Danh Sách Khoảng Trống Nghiên Cứu & Phân Công Thành Viên (Gap List)
## Dự án: ScamShield – Nền tảng phát hiện tin nhắn/cuộc gọi lừa đảo & Cảnh báo cộng đồng (SCS)
### Tổng hợp từ 34 bài báo khoa học cốt lõi của 5 thành viên

---

## 1. Bảng Tổng Hợp Phân Công Trách Nhiệm GAP của Từng Thành Viên

| STT | Khoảng Trống Nghiên Cứu (Research Gap) | Phân Loại GAP | Thành Viên Chọn GAP | Định Hướng Đóng Góp cho Đồ Án ScamShield (SCS) | Core Papers Tham Chiếu |
| :---: | :--- | :---: | :---: | :--- | :--- |
| **GAP 1** | **Thiếu hụt dữ liệu tiếng Việt & Kỹ thuật né tránh Teencode / Dấu**<br>*(Severe Scarcity of Vietnamese Scam Datasets & Linguistic Evasion)* | **GAP-D**<br>*(Dataset)* | **Nguyễn Minh Quang** (`minh_quang`) | • Xây dựng bộ Dataset tin nhắn lừa đảo Tiếng Việt chuẩn hóa (>=500 mẫu, 5-7 nhãn phân loại).<br>• Ứng dụng kỹ thuật Data Augmentation sinh biến thể teencode/lỗi chính tả để huấn luyện mô hình chống vượt rào. | `M001`, `M002`, `M003`, `M008`, `M009`, `M011` |
| **GAP 2** | **Nghịch lý Độ chính xác – Độ trễ – Chi phí (Accuracy-Latency-Cost Trilemma)**<br>*(Inference Latency & High Cost of Massive LLMs vs Lightweight ML Degradation)* | **GAP-M**<br>*(Measurement)* | **Nguyễn Trung Hiếu** (`trung_hieu`) | • Thiết kế **Kiến trúc AI 2 tầng (2-Tier Cascaded AI)**: Tầng 1 PhoBERT chạy CPU cục bộ xử lý 80% tin nhắn thông thường trong `<250ms` (0đ chi phí); Tầng 2 Gemini Cloud chỉ gọi khi độ tự tin <90%.<br>• Áp dụng hàm mất mát Weighted Binary Cross-Entropy (WBCE) phạt nặng False Negatives. | `M023`, `M039`, `M040`, `M041`, `M042` |
| **GAP 3** | **Điểm mù đa phương thức (Quishing mã QR & Ảnh chụp màn hình mạo danh)**<br>*(Multimodal Threat Blindness: QR Codes & Image-Based Fake Notices)* | **GAP-T**<br>*(Technological)* | **Phan Trần Hoàng Trân** (`hoang_tran`) | • Tích hợp **Module OCR (Tesseract / PaddleOCR)** bóc tách text từ ảnh chụp màn hình Zalo/Messenger/SMS.<br>• Xây dựng bộ giải mã QR Code tự động trích xuất link đích và kiểm tra danh tiếng tên miền độc hại chống Quishing. | `M014`, `M017`, `M018`, `M019`, `M021`, `M025` |
| **GAP 4** | **Đánh giá tin nhắn đơn lẻ vs Tiến trình hội thoại lừa đảo nhiều lượt**<br>*(Single-Message Evaluation vs Multi-Turn Conversational Progression)* | **GAP-T**<br>*(Technological)* | **Hoàng Hải Phúc** (`hai_phuc`) | • Thiết kế cơ chế **Phân tích Hội thoại Đa lượt (Multi-turn Thread Analysis)** cho phép upload toàn bộ luồng chat, phát hiện các thủ thuật tâm lý xã hội (tạo sự cấp bách, giả mạo cơ quan công quyền, mồi nhử tài chính) tiến triển qua từng câu nói. | `M006`, `M007`, `M008`, `M009`, `M010`, `M011`, `M012`, `M013` |
| **GAP 5** | **Sự đứt gãy giữa mô hình học máy tĩnh & Trí tuệ đe dọa cộng đồng**<br>*(Disconnect Between Static Classifiers & Community Threat Intelligence)* | **GAP-S**<br>*(Shared Limitation)* | **Nguyễn Quốc Huy** (`quoc_huy`) | • Xây dựng **Hệ thống Blacklist Cộng đồng** kèm quy trình kiểm duyệt (Moderation Workflow) đa tầng chống báo cáo giả.<br>• Tích hợp bản đồ nhiệt cảnh báo lừa đảo (Threat Heatmap) thời gian thực và mạng lưới chia sẻ tri thức mối đe dọa mới. | `M029`, `M030`, `M031`, `M032`, `M033`, `M034`, `M035`, `M036`, `M037`, `M038` |

---

## 2. Chi Tiết Nội Dung 5 Khoảng Trống Nghiên Cứu (Deep-Dive Analysis)

### 🔴 GAP 1: Thiếu hụt nghiêm trọng tập dữ liệu lừa đảo Tiếng Việt & Kỹ thuật né tránh qua Teencode
* **Thực trạng từ các bài báo khoa học:**
  * Tuấn et al. (M001), Nguyen-Xuan et al. (M002), Cam et al. (M003) chỉ ra rằng trong khi tiếng Anh có hàng chục nghìn mẫu dữ liệu công khai (SMS Spam Collection, Enron, PhishTank), các bộ dữ liệu tin nhắn lừa đảo tiếng Việt được gán nhãn chuẩn hầu như không tồn tại — buộc các nghiên cứu hiện có phải tự thu thập dữ liệu quy mô nhỏ và thiếu tính đại diện.
  * Vấn đề này không chỉ giới hạn ở tiếng Việt: Lihawa &   Mwambe (M008) xác nhận mô hình Swahili-BERT của họ "không xử lý được các phương ngữ vùng miền phi chuẩn, từ viết tắt và teencode/tiếng lóng" — một hạn chế gần như trùng khớp với tình trạng né tránh bằng teencode tại Việt Nam (c0ng an, v4y t1en, nh4n thu0ng). Điều này chứng minh đây là một vấn đề mang tính hệ thống ở các ngôn ngữ tài nguyên thấp (low-resource languages), chứ không phải đặc thù cục bộ.
  * Mambina et al. (M009) cung cấp tiền lệ phương pháp luận trực tiếp: nhóm tác giả đã tự xây dựng một bộ dữ liệu SMS spam tiếng Swahili từ đầu (N=63,918 sau SMOTE) do không có dữ liệu công khai tồn tại — đúng quy trình mà ScamShield cần áp dụng cho tiếng Việt.
  * Latifah et al. (M011) đi xa hơn bằng cách áp dụng kỹ thuật Easy Data Augmentation (EDA) trên bộ dữ liệu SMS tiếng Indonesia (N=2,721), giúp tăng F1-score trung bình 12% cho các lớp thiểu số — đây là bằng chứng thực nghiệm trực tiếp rằng kỹ thuật data augmentation có thể bù đắp cho sự khan hiếm dữ liệu ở ngôn ngữ ít tài nguyên, chính là nền tảng lý luận cho giải pháp "LLM Few-Shot Augmentation sinh biến thể teencode" của ScamShield.
  * Kết hợp lại, 6 bài báo này cho thấy: (1) tiếng Việt thiếu dữ liệu chuẩn hóa tương tự Swahili/Indonesia/Bangla, (2) vấn đề teencode/tiếng lóng là rào cản đã được ghi nhận ở các ngôn ngữ tài nguyên thấp khác, và (3) kỹ thuật augmentation để giải quyết vấn đề này đã được kiểm chứng thực nghiệm — nhưng chưa từng được áp dụng cho tiếng Việt.
* **Giải pháp của ScamShield:**
    * Xây dựng bộ Dataset tin nhắn lừa đảo Tiếng Việt đầu tiên (>=500 mẫu, 5–7 nhãn phân loại) thu thập từ Cục An toàn thông tin (NCSC), cảnh báo báo chí và cộng đồng — theo đúng quy trình thu thập dữ liệu gốc như M009 đã thực hiện cho tiếng Swahili.
    * Tích hợp kỹ thuật Data Augmentation (tham chiếu phương pháp EDA của M011, kết hợp LLM Few-Shot Generation) để sinh biến thể teencode/lỗi chính tả, huấn luyện mô hình PhoBERT chống vượt rào — giải quyết đồng thời cả vấn đề khan hiếm dữ liệu và né tránh teencode mà M008 đã chỉ ra là hạn chế chưa được giải quyết.

---

### 🔴 GAP 2: Nghịch lý Đánh đổi Độ chính xác – Độ trễ – Chi phí (Accuracy-Latency-Cost Trilemma)
* **Thực trạng từ các bài báo khoa học:**
  * *Mahendru et al. (M032, SecureNet)* chứng minh các LLM lớn (GPT-4, Gemini Pro) có độ trễ lên tới **13 – 15 giây (13,000ms - 15,000ms)** mỗi tin nhắn và chi phí API cao ($0.002 - $0.01/lần gọi), hoàn toàn không khả thi để quét tin nhắn di động thời gian thực.
  * Ngược lại, các mô hình học máy nhẹ (Naive Bayes, SVM, BiGRU) tuy chạy rất nhanh (0.25ms - *M041*) nhưng độ chính xác giảm sút mạnh khi gặp các chiêu trò lừa đảo mới (*M006, M031*).
* **Giải pháp của ScamShield (Kiến trúc AI 2 tầng Cascaded):**
  * **Tầng 1 (Fast-Path Local / CPU):** Fine-tuned `PhoBERT-base` với hàm mất mát **Weighted Binary Cross-Entropy (WBCE)** phạt nặng việc bỏ sót lừa đảo. Xử lý 80% tin nhắn thường trong `<250ms` với chi phí 0đ.
  * **Tầng 2 (Cloud LLM Reasoning):** `Gemini-2.0-Flash` / `GPT-4o-mini` với *Few-shot Prompting*. Chỉ kích hoạt khi Tầng 1 có độ tự tin `<90%` hoặc khi phân tích đoạn chat dài, đạt độ trễ `<3s` và cắt giảm 80% chi phí API.

---

### 🔴 GAP 3: Điểm mù đa phương thức (Quishing mã QR & Ảnh chụp thông báo/lệnh bắt giả)
* **Thực trạng từ các bài báo khoa học:**
  * *QuishingShield (M014)*, *GRPO-MMS (M007)* và *PEEK Framework (M035)* nhấn mạnh xu hướng tội phạm mạng chuyển sang gửi ảnh chụp lệnh bắt giả, ảnh chụp biên lai chuyển tiền và mã QR độc hại (**Quishing**) để né hoàn toàn các bộ lọc NLP dạng văn bản.
  * Hơn 85% nghiên cứu hiện tại chỉ phân tích Text thuần túy (*M008, M009, M010, M038, M042*), tạo ra lỗ hổng bảo mật rất lớn trên Zalo và Messenger.
* **Giải pháp của ScamShield:**
  * Tích hợp công cụ **OCR (Tesseract/PaddleOCR)** tự động bóc tách text từ ảnh chụp màn hình do người dùng gửi lên.
  * Tích hợp bộ giải mã QR Code tự động kiểm tra mức độ an toàn của đường link đích qua Google Safe Browsing và Blacklist nội bộ.

---

### 🔴 GAP 4: Đánh giá tin nhắn đơn lẻ vs Phân tích tiến trình hội thoại lừa đảo đa lượt
* **Thực trạng từ các bài báo khoa học:**
  * Các bộ phân loại truyền thống chỉ đánh giá một tin nhắn đơn lẻ (ví dụ: "Anh Nam ơi có nhà không?"). Đứng riêng lẻ, tin nhắn hoàn toàn vô hại (Ham).
  * Tuy nhiên, các kịch bản lừa đảo thao túng tâm lý (bẫy tình cảm, làm nhiệm vụ shopee, đầu tư tài chính) diễn ra qua **5 – 10 lượt hội thoại**, leo thang từ làm quen đến yêu cầu chuyển tiền.
* **Giải pháp của ScamShield:**
  * Cho phép người dùng tải lên toàn bộ luồng hội thoại (nhiều ảnh chụp chat hoặc file text transcript), AI Engine sẽ phân tích sự tiến triển tâm lý xã hội (đe dọa, mồi chài, tạo sự khẩn cấp) qua từng bước nói chuyện.

---

### 🔴 GAP 5: Sự đứt gãy giữa mô hình học máy tĩnh & Trí tuệ đe dọa cộng đồng
* **Thực trạng từ các bài báo khoa học:**
  * Tất cả các bài báo học thuật chỉ huấn luyện mô hình tĩnh trên tập dữ liệu đóng. Khi xuất hiện các chiến dịch lừa đảo mới (ví dụ: app VNeID giả mạo, nộp phạt giao thông online), mô hình tĩnh hoàn toàn bất lực cho đến khi được huấn luyện lại sau nhiều tháng.
* **Giải pháp của ScamShield:**
  * Kết hợp AI với **Nền tảng Blacklist Cộng đồng**:
    * Cho phép người dùng báo cáo số điện thoại, số tài khoản ngân hàng và link website lừa đảo.
    * Quy trình kiểm duyệt đa tầng (Moderator review, chấm điểm độ tin cậy, gom cụm báo cáo trùng) chống spam/phá hoại.
    * Bản đồ nhiệt rủi ro (Threat Heatmap) và Cổng tri thức nâng cao nhận thức cho người dân.

---

## 3. Bảng Đối So sánh Phương Pháp Luận (Methodological Comparison Matrix)

| Tiêu Chí So Sánh | Hiện Trạng 34 Bài Báo Học Thuật (State-of-the-Art) | Nền Tảng ScamShield (SCS) |
| :--- | :--- | :--- |
| **Phạm vi Ngôn ngữ** | Tiếng Anh, Kiswahili, Bangla, Trung Quốc | **Tiếng Việt chuyên sâu (PhoBERT + Chống vượt rào Teencode)** |
| **Kiến trúc AI** | Đơn tầng (hoặc chỉ dùng LLM nặng, hoặc chỉ dùng ML nhẹ) | **2-Tier Cascaded AI (PhoBERT Tầng 1 + Gemini Few-Shot Tầng 2)** |
| **Phương thức Xử lý** | 85%+ chỉ đọc văn bản SMS ngắn | **Đa phương thức (Text + OCR Ảnh chụp màn hình + Giải mã QR Quishing)** |
| **Ngữ cảnh Phân tích** | 1 tin nhắn đơn lẻ (1-turn) | **Hội thoại đa lượt (Multi-turn Conversation Thread)** |
| **Cơ chế Vận hành** | Mô hình tĩnh trong phòng thí nghiệm | **Blacklist cộng đồng sống + Quy trình duyệt Moderator thời gian thực** |
| **Độ trễ & Chi phí** | Độ trễ cao (>13s) hoặc độ chính xác thấp | **< 250ms cho 80% lưu lượng; Tiết kiệm 80% chi phí API** |

---

## 4. Kết luận Bảo vệ Đồ án Capstone & Báo cáo RBL
Toàn bộ danh sách khoảng trống nghiên cứu và phân công nhiệm vụ trên khẳng định **ScamShield là một giải pháp khoa học hoàn chỉnh, có tính thực tiễn cao và lấp đầy các điểm yếu lớn nhất của các nghiên cứu đi trước**.