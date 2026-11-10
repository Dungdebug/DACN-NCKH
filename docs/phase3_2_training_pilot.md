# BÁO CÁO KHOA HỌC PHASE 3.2 — TRAINING PILOT FOR SA-CMS / HYBRID MEMORY

**Dự án:** Nghiên cứu kiến trúc Bộ nhớ Đa tầng Tự thích ứng (SA-CMS) kết hợp Truy xuất Dày đặc trong Mô hình Ngôn ngữ  
**Giai đoạn:** Phase 3.2 — Training Pilot cho Adapter + Gate của SA-CMS  
**Ngày thực hiện:** 03/10/2026  
**Môi trường:** Python 3.9.13 | PyTorch 2.x | NVIDIA GeForce GTX 1650 Ti (4GB VRAM)  
**Trạng thái kiểm thử:** 92/92 Unit/Integration Tests PASSED  

---

## 1. MỤC TIÊU VÀ PHẠM VI NGHIÊN CỨU

Sau khi hoàn tất phân tích lỗi và kiểm chứng refusal tại **Phase 3.1.1**, mục tiêu của **Phase 3.2** là triển khai và kiểm chứng thực nghiệm quy trình **huấn luyện pilot (pilot training)** cho các tham số thích ứng bộ nhớ (CMS low-rank adapters và trainable gates) trên một phân vùng dữ liệu huấn luyện hoàn toàn biệt lập (**TRAIN SPLIT RIÊNG**).

### Nguồn Chân lý (Source of Truth):
1. **Đề cương NCKH** đã phê duyệt (định nghĩa quy mô huấn luyện bằng số lượng token thực tế).
2. **Nested Learning Paper** ([arXiv:2512.24695v1](https://arxiv.org/abs/2512.24695v1)) — Equation 70 & 71 (Cơ chế cập nhật bộ nhớ thích ứng).
3. **Phase 2.5.2 Final Reconciled Results** — Đóng băng kết quả RQ2 và kiểm toán khoa học.
4. **Phase 3.0 & 3.1 / 3.1.1 Foundation** — Kiến trúc Hybrid Memory + Retrieval, Document Store, Refusal Controller.

### Quy tắc Bắt buộc Thực hiện:
- **Nguyên tắc Phân vùng Dữ liệu (Isolation):** Không sử dụng bất kỳ sample hoặc tài liệu nào từ Phase 3.1 / 3.1.1 (`DOC001`, `DOC002`, `DOC003`, `Q001`–`Q100`). Trùng lặp (overlap) = 0%.
- **Giữ nguyên Benchmark:** Giữ nguyên 120 evaluation cases hiện tại của hệ thống.
- **Không Redesign:** Giữ nguyên công thức và kiến trúc SA-CMS (`SequentialMLPChain` + `cms_norm`).
- **Đóng băng Backbone:** Đóng băng 100% tham số backbone (`SmolLM2-135M` với 134,515,008 tham số).
- **Chỉ huấn luyện Adapter:** Chỉ tối ưu hóa 3,544,320 tham số CMS adapter & gating (chiếm 2.57% tổng số tham số).
- **Ranh giới Khoa học:** Đây là Training Pilot nhằm kiểm chứng pipeline kỹ thuật, không tuyên bố SA-CMS vượt RAG hay B5 ở giai đoạn này.

---

## 2. BỘ DỮ LIỆU HUẤN LUYỆN VÀ ĐO LƯỜNG TOKEN THỰC TẾ (TASKS 1 & 2)

> [!IMPORTANT]
> **Ranh giới Quy mô Định lượng:**  
> Đợt thử nghiệm này là **"small-scale pilot used to validate training mechanics"** (thử nghiệm quy mô nhỏ dùng để kiểm chứng cơ chế huấn luyện).  
> - Đề cương NCKH dự kiến quy mô huấn luyện toàn diện ở mức **50–100 triệu tokens (50–100M tokens)**.  
> - Pilot hiện tại mới ở quy mô nhỏ (từ 33,549 tokens đến 65,715 tokens).  
> - Đây là **giai đoạn kiểm định tính khả thi (feasibility stage)**.  
> Theo đề cương, quy mô phải được ghi rõ theo token thực tế: không được gọi "100 samples = 100 training units theo đề cương" mà phải ghi rõ "100-example pilot, total X tokens".

### 2.1. Cấu trúc Phân vùng Dữ liệu
Dữ liệu được tổ chức tại module [`src/training/training_corpus.py`](src/training/training_corpus.py) gồm 20 tài liệu nghiên cứu chuyên sâu (`TR_DOC_001` đến `TR_DOC_020`) thuộc các lĩnh vực: Khoa học máy tính, Kiến trúc bộ nhớ ngoài, Hệ thống phân tán, Lý thuyết thông tin và Tối ưu hóa Gradient.

- **Pilot A (100 training samples):** Lấy từ 10 tài liệu đầu tiên (`TR_DOC_001`–`TR_DOC_010`), mã câu hỏi `TR_Q001`–`TR_Q100`.
- **Pilot B (200 training samples):** Lấy từ toàn bộ 20 tài liệu (`TR_DOC_001`–`TR_DOC_020`), mã câu hỏi `TR_Q001`–`TR_Q200`.
- **Validation Split (50 samples độc lập):** Tạo từ 5 tài liệu riêng biệt (`VAL_DOC_001`–`VAL_DOC_005`), mã câu hỏi `VAL_Q001`–`VAL_Q050`. Không trùng lặp với tập train và tập test Phase 3.1.

### 2.2. Đo lường Token Thực tế (Token Accounting)
Đo lường chính xác bằng HuggingFace Tokenizer của `SmolLM2-135M` (cố định preprocessing):

| Tập Dữ liệu | Số Mẫu (Samples) | Số Tài liệu (Docs) | Tokens / Epoch | Tổng Tokens Xử lý (3 Epochs) | Avg Tokens / Mẫu | Min Tokens | Max Tokens |
| :--- | :---: | :---: | :---: | :---: | :---: | :---: | :---: |
| **Pilot A (100)** | 100 | 10 | **11,183** | **33,549** | 111.83 | 95 | 135 |
| **Pilot B (200)** | 200 | 20 | **21,905** | **65,715** | 109.53 | 92 | 135 |
| **Validation Set** | 50 | 5 | **5,535** | N/A (Eval) | 110.70 | 94 | 126 |

> **Quy ước Báo cáo Chuẩn:**
> - Pilot A: *"100-example pilot, total 11,183 tokens/epoch (33,549 tokens processed across 3 epochs)"*
> - Pilot B: *"200-example pilot, total 21,905 tokens/epoch (65,715 tokens processed across 3 epochs)"*

---

## 3. CẤU HÌNH HUẤN LUYỆN (TASK 3)

Cấu hình huấn luyện được cố định, không tùy tiện tinh chỉnh (hyperparameter tuning) giữa 2 pilot:

- **Backbone:** `HuggingFaceTB/SmolLM2-135M` (134,515,008 tham số, **FROZEN 100%**).
- **Bộ nhớ Ngoài (SA-CMS):** `num_levels=2` (3,544,320 tham số, **TRAINABLE** chiếm 2.57%).
- **Optimizer:** `AdamW` ($\beta_1=0.9, \beta_2=0.999, \epsilon=10^{-8}$, weight decay = $0.01$).
- **Learning Rate:** $1 \times 10^{-4}$ (cố định).
- **Batch Size:** 2 | **Gradient Accumulation Steps:** 2 $\rightarrow$ **Effective Batch Size:** 4.
- **Gradient Clipping:** Max norm = 1.0 (ngăn chặn hiện tượng gradient explosion).
- **Precision:** `FP32` (`torch.float32`) nhằm đảm bảo độ ổn định số học trên kiến trúc GPU Turing.
- **Max Sequence Length:** 256 tokens.
- **Số Epoch:** 3 epochs.
- **Random Seed:** 42.

---

## 4. KẾT QUẢ THỰC NGHIỆM CHI TIẾT (TASKS 4, 5, 6, 7)

Cả hai pilot huấn luyện đều hoàn tất 100% không phát sinh lỗi số học (zero NaN loss).

### 4.1. Bảng So sánh Tổng hợp: Pilot 100 vs Pilot 200

Kết quả được xuất tự động tại [`results/phase3_2_training_comparison.csv`](results/phase3_2_training_comparison.csv) và [`results/phase3_2_training_config.json`](results/phase3_2_training_config.json):

| Chỉ số Thực nghiệm (Metric) | Baseline (Pre-train) | Pilot A (100 samples) | Pilot B (200 samples) | Ghi chú & Xu hướng |
| :--- | :---: | :---: | :---: | :--- |
| **Quy mô Mẫu (Sample Count)** | N/A | 100 | 200 | Gấp 2 lần |
| **Số Tài liệu (Documents)** | N/A | 10 | 20 | Gấp 2 lần độ đa dạng |
| **Tokens / Epoch** | N/A | 11,183 tokens | 21,905 tokens | Gần gấp đôi dung lượng token |
| **Tổng Tokens Xử lý (3 Epochs)** | N/A | 33,549 tokens | 65,715 tokens | Token budget thực tế |
| **Tham số Huấn luyện (Trainable)**| 0 | 3,544,320 (2.57%) | 3,544,320 (2.57%) | Giữ nguyên kiến trúc adapter |
| **Tham số Đóng băng (Frozen)** | 138,059,328 | 134,515,008 (97.43%) | 134,515,008 (97.43%) | Đóng băng tuyệt đối backbone |
| **Train Loss (Epoch 1)** | N/A | 4.5745 | 4.5972 | Bắt đầu hội tụ ổn định |
| **Train Loss (Epoch 2)** | N/A | 3.7465 | 3.9144 | Giảm đều đặn |
| **Train Loss (Epoch 3)** | N/A | **3.3757** | **3.5052** | Cả 2 đều hội tụ tốt |
| **Val Loss (Post-train)** | 5.0655 | **4.4886** | **4.5738** | Cải thiện so với baseline pre-train |
| **Val Perplexity (PPL)** | 158.46 | **89.00** | **96.92** | PPL giảm mạnh (từ 158 xuống < 100) |
| **Answer-level Token F1** | 0.1862 | **0.2487** | **0.2431** | Cải thiện F1 tương quan từ ngữ |
| **Exact Match (EM)** | 0.00 | **0.02** | 0.00 | Dấu hiệu sinh chính xác từ khóa |
| **Thời gian Chạy (Wall-clock Time)**| N/A | **10.95 s** | **22.54 s** | Tỉ lệ tuyến tính hoàn hảo (~2x) |
| **Thông lượng (Throughput)** | N/A | 3,062.44 tokens/s | 2,915.20 tokens/s | Hiệu suất cao trên GPU consumer |
| **VRAM Đỉnh (Peak VRAM)** | N/A | **826.47 MB** | **828.58 MB** | Rất nhẹ (< 1GB VRAM) |
| **Kích thước Checkpoint** | N/A | **13.52 MB** | **13.52 MB** | Chỉ lưu trọng số CMS & Gate |

---

## 5. PHÂN TÍCH KHOA HỌC VÀ ĐỐI CHIẾU 100 VS 200 (TASK 7)

### 5.1. Phân tích Đường cong Hội tụ Huấn luyện (Convergence Curves)
- **Train Loss:** Cả hai mô hình đều cho thấy đường cong tối ưu hóa mượt mà:
  - Pilot 100: $4.5745 \rightarrow 3.7465 \rightarrow 3.3757$ (giảm 26.2%).
  - Pilot 200: $4.5972 \rightarrow 3.9144 \rightarrow 3.5052$ (giảm 23.7%).
- Gradient norm clipping tại ngưỡng 1.0 cùng với `torch.float32` loại bỏ hoàn toàn hiện tượng numerical instability.

### 5.2. Đánh giá Tổng quát hóa trên Validation Set (Không kết luận phiến diện)
- **Quy tắc Nghiên cứu:** *Tuyệt đối không kết luận "200 tốt hơn" chỉ dựa vào train loss.*
- **Quan sát Thực nghiệm:**
  - Pilot 100 đạt Validation Loss là **4.4886** (Val PPL = 89.00), trong khi Pilot 200 đạt Validation Loss là **4.5738** (Val PPL = 96.92).
  - Về Answer-level Token F1: Pilot 100 đạt **0.2487**, Pilot 200 đạt **0.2431** (cả hai đều vượt trội so với mức pre-train 0.1862).
- **Lý giải Khoa học:**
  - Adapter của SA-CMS ở cấu hình pilot có quy mô tham số nhỏ ($3.54\times 10^6$ tham số). Khi tăng kích thước dữ liệu lên gấp đôi (20 tài liệu thay vì 10 tài liệu, 21.9k tokens) với cùng số epoch (3 epochs) và learning rate không đổi ($1\times 10^{-4}$), mô hình Pilot 200 phải phân bổ dung lượng biểu diễn trên tập ngữ cảnh rộng hơn. Do đó, nếu không có cơ chế learning rate decay hoặc số bước gradient update dài hơn, việc tăng dữ liệu thô không tự động làm giảm validation loss ngay lập tức. Đây là một phát hiện khoa học khách quan quan trọng phục vụ thiết kế thực nghiệm Phase 4.

---

## 6. KHẢ NĂNG TÁI LẬP VÀ KIỂM CHỨNG CHECKPOINT (TASK 8)

Hệ thống đã tự động xuất và đóng gói đầy đủ các artifact phục vụ tái lập:

### 6.1. Cấu trúc Checkpoint
- [`checkpoints/pilot_100/cms_weights.pt`](checkpoints/pilot_100/cms_weights.pt) (13.52 MB)
- [`checkpoints/pilot_100/training_config.json`](checkpoints/pilot_100/training_config.json)
- [`checkpoints/pilot_200/cms_weights.pt`](checkpoints/pilot_200/cms_weights.pt) (13.52 MB)
- [`checkpoints/pilot_200/training_config.json`](checkpoints/pilot_200/training_config.json)

### 6.2. Kiểm thử Khôi phục Checkpoint (Bit-level Reload Fidelity Test)
Tại cuối mỗi run pilot và trong test case [`tests/test_training_pipeline.py`](tests/test_training_pipeline.py):
1. Khởi tạo một phiên bản `PretrainedHopeLM` độc lập với trọng số khởi tạo ban đầu.
2. Nạp `state_dict` đã lưu từ checkpoint file vào `model.cms` và `model.cms_norm`.
3. Chạy forward pass so sánh trực tiếp output logits trên cùng một mẫu kiểm thử giữa model gốc và model vừa nạp lại.
4. **Kết quả:**
   $$\Delta_{\text{max}} = \max | \text{logits}_{\text{orig}} - \text{logits}_{\text{reloaded}} | = \mathbf{0.00000000}$$
   Độ sai lệch bằng 0 tuyệt đối, chứng minh checkpoint lưu trữ đầy đủ và chính xác 100% trọng số huấn luyện.

---

## 7. KIỂM THỬ HỒI QUY TOÀN DIỆN (REGRESSION TEST SUITE)

Toàn bộ **92 test cases** (85 test kế thừa từ các phase trước + 7 test mới cho training pipeline) đều chạy đạt chuẩn:

```text
tests/test_attention.py ............                                      [ 13%]
tests/test_checkpoint.py ..                                              [ 15%]
tests/test_cms.py .......                                                 [ 22%]
tests/test_document_structure.py .......                                  [ 30%]
tests/test_hope_attention.py .....                                        [ 35%]
tests/test_hybrid_qa.py ................                                  [ 53%]
tests/test_inference.py ...                                               [ 56%]
tests/test_memory.py .                                                    [ 57%]
tests/test_phase3_1_e2e.py ..................                             [ 77%]
tests/test_sa_cms_update.py .......                                       [ 84%]
tests/test_smoke.py .                                                     [ 85%]
tests/test_training_pipeline.py .......                                   [100%]
============================== 92 passed in 23.79s ==============================
```

Chi tiết 7 test mới trong [`tests/test_training_pipeline.py`](tests/test_training_pipeline.py):
1. `test_no_document_overlap_with_phase3_1`: Xác nhận 0% tài liệu trùng lặp với Phase 3.1.
2. `test_no_question_overlap_with_phase3_1`: Xác nhận 0% câu hỏi trùng lặp với Phase 3.1.
3. `test_sample_counts_and_partitioning`: Kiểm tra tính toàn vẹn phân vùng (100 train, 200 train, 50 val).
4. `test_frozen_backbone_and_trainable_cms`: Kiểm tra 134.5M backbone params bị đóng băng, 3.54M CMS params trainable.
5. `test_gradient_flow_only_to_cms`: Kiểm tra gradient chỉ truyền vào CMS adapter, gradient tại backbone luôn là None.
6. `test_token_f1_and_em`: Kiểm tra độ chuẩn xác của hàm tính toán F1 và Exact Match.
7. `test_checkpoint_save_and_reload_fidelity`: Kiểm tra việc lưu và nạp checkpoint đạt độ chính xác bit-level.

---

## 8. RANH GIỚI KHOA HỌC BẮT BUỘC (TASK 9 — SCIENTIFIC BOUNDARY)

Để đảm bảo tính trung thực và liêm chính học thuật tuyệt đối theo chuẩn NCKH:

1. **Bản chất của Phase 3.2:** Đây thuần túy là **TRAINING PILOT** nhằm kiểm chứng:
   - Pipeline tối ưu hóa tham số adapter (gradient backpropagation qua frozen backbone).
   - Kiểm soát rò rỉ dữ liệu (zero leakage).
   - Định lượng token thực tế theo chuẩn đề cương.
   - Cơ chế lưu trữ và nạp checkpoint nhẹ (13.5 MB).
2. **Tuyệt đối KHÔNG tuyên bố:**
   - *Không tuyên bố SA-CMS vượt qua RAG (B1/B2/B3).*
   - *Không tuyên bố SA-CMS vượt qua Memory Baseline B5.*
   - *Không tuyên bố việc training đã cải thiện Faithfulness hay giải quyết triệt để Refusal.*
   - *Không suy diễn rằng 200 samples luôn vượt trội hơn 100 samples.*
3. **Kế hoạch tiếp theo:**
   Mọi kết luận so sánh hiệu năng, năng lực trả lời câu hỏi và tỷ lệ từ chối giữa các phương pháp B1–B5 và P1–P2 sẽ chỉ được xác lập thông qua **Controlled Benchmark thực nghiệm tại Phase 4**.

---

*Báo cáo hoàn tất. Toàn bộ mã nguồn, cấu hình và trọng số checkpoint đã sẵn sàng cho bước chuẩn bị Phase 4.*
