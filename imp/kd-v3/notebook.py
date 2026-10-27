# /// script
# requires-python = ">=3.13"
# dependencies = [
#     "timm==1.0.30",
#     "tqdm==4.70.1",
# ]
# ///

import marimo

__generated_with = "0.25.2"
app = marimo.App(auto_download=["html"])


@app.cell
def _():
    import marimo as mo

    return (mo,)


@app.cell(hide_code=True)
def _(mo):
    mo.md(r"""
    # KD teacher-student: BEATs (nhiễu sạch) → FRCRN + MobileViT-S, học bằng q/k/v và CRD

    | Nhánh | Đường đi | Trạng thái |
    | --- | --- | --- |
    | Teacher | **nhiễu thật** → chuẩn hoá RMS → fbank → BEATs fine-tune (`pretrained/beat-ft`, fold 0) | đóng băng |
    | Student | mixture → FRCRN (`pretrained/FRCRN/best_e037_…pt`, mask) → n̂ → log-mel → **MobileViT 12 lớp** (L = 2, 6, 4; d = 768; 12 head) → attention pooling → logit 36 | FRCRN đóng băng, MobileViT huấn luyện |
    | KD | **q/k/v** của 12 lớp self-attention BEATs ← 12 lớp Transformer của student (khối 1: lớp 1-2 ↔ BEATs 1-2, khối 2: lớp 1-6 ↔ BEATs 3-8, khối 3: lớp 1-4 ↔ BEATs 9-12); **CRD** trên embedding đã pool; **logit** 36 lớp của head teacher | chỉ lúc train |

    **Loss** = CE (label smoothing 0.1) + λ_qkv · L_qkv + λ_crd · L_crd + λ_logit · L_logit + λ_hn · L_hn. Ba λ của KD tăng tuyến tính trong `warmup_epochs` epoch đầu (hoặc giảm tuyến tính về 0 ở nhánh ESKD). L_hn là hard-negative theo nhóm lớp dễ nhầm, **không dùng teacher** và không nhân hệ số KD nên độc lập với ablation KD; mặc định tắt (λ_hn = 0).

    - **L_qkv** (mỗi cặp lớp, mỗi loại q, k, v): `1 − cos` theo từng token + `REL_WEIGHT` · KL giữa ma trận quan hệ `softmax(xxᵀ/√d)` theo từng head (kiểu MiniLM). Cosine không phụ thuộc thang đo, nên q, k, v có độ lớn khác nhau vẫn so sánh được. Student có cùng d = 768 và 12 head với BEATs nên so q, k, v trực tiếp, không cần adapter. Student lấy q/k/v từ `attn.qkv` của từng lớp (trung bình theo 4 vị trí trong patch); q/k/v của teacher được pool trung bình về lưới token của khối student (8×25, 4×13, 2×7 với clip 4 s). Có thể giới hạn trong một tập lớp BEATs bằng `qkv_layers` (ví dụ 9-12) mà không đổi ánh xạ lớp.
    - **L_crd** (Tian et al., 2020): hai head chiếu về 128 chiều, L2-norm. Positive là cùng mẫu ở hai view, negative lấy `CRD_NEGATIVES` mẫu ngẫu nhiên từ memory bank (cập nhật momentum). Negative cùng lớp với anchor bị loại, để tránh false negative vì tập chỉ có 36 lớp.
    - **L_logit** (Hinton et al., 2015): `T² · KL(softmax(z_t/T) ‖ softmax(z_s/T))` với T = 4 (có thể đổi bằng khoá `T`). Teacher nhìn nhiễu sạch nên logit của nó là nhãn mềm "có đặc quyền"; đổi lại teacher fold 0 chỉ đạt khoảng 0.74 accuracy trên nhiễu sạch và 0.66 trên n̂ của FRCRN (validation), nên nhãn mềm có nhiễu và CE vẫn giữ vai trò neo.
    - **Đánh giá:** 9 chỉ số (top1, top3, balanced acc, precision, recall, macro-F1, micro-F1, mAP, macro-AUC) tại từng mức SNR (−5…20) và trung bình. Checkpoint chọn theo `macro_acc` (balanced acc trung bình theo SNR), đúng chuẩn repo.

    `RUN_TRAINING = False` chỉ chạy smoke test nhỏ (64 mẫu, 1 epoch) vào `output/test/`. Cell (1) có hàng đợi `RUNS`: mỗi nhánh bật/tắt từng loss (`qkv`, `crd`, `logit`), đổi nhiệt độ `T`, giới hạn lớp q/k/v, bật hard-negative `hn`, hoặc khởi tạo từ checkpoint tốt nhất rồi giảm KD (ESKD); xem mục "Huấn luyện và đánh giá". `USE_NHAT_CACHE` tính trước n̂ của FRCRN một lần để epoch nhanh hơn nhiều.

    **Hậu xử lý (sau huấn luyện).** Hiệu chỉnh bias theo lớp `z'_c = z_c + b_c` (`b_c = τ·log(q_c/p_c)`), fit trên val bằng lưới τ, khoá rồi đánh giá test một lần; không đổi trọng số. Chi tiết ở mục "Hiệu chỉnh bias theo lớp" cuối notebook.
    """)
    return


@app.cell(hide_code=True)
def _(mo):
    mo.md(r"""
    <p align="center"><img alt="Tổng quan pipeline" src="data:image/svg+xml;base64,<svg xmlns="http://www.w3.org/2000/svg" width="900" height="420" viewBox="0 0 900 420"><title>Tổng quan pipeline KD</title><defs><marker id="arr" viewBox="0 0 10 10" refX="9" refY="5" markerWidth="7" markerHeight="7" orient="auto-start-reverse"><path d="M0 0 L10 5 L0 10 z" fill="#4b5563"/></marker></defs><rect width="900" height="420" fill="#ffffff"/><rect x="10" y="8" width="16" height="12" rx="3" fill="#dbeafe" stroke="#2563eb" stroke-width="1.4"/><text x="32" y="18.5" font-family="Segoe UI, Arial, sans-serif" font-size="11" font-weight="400" text-anchor="start" fill="#374151">Teacher</text><rect x="160" y="8" width="16" height="12" rx="3" fill="#dcfce7" stroke="#16a34a" stroke-width="1.4"/><text x="182" y="18.5" font-family="Segoe UI, Arial, sans-serif" font-size="11" font-weight="400" text-anchor="start" fill="#374151">Student</text><rect x="310" y="8" width="16" height="12" rx="3" fill="#ffedd5" stroke="#ea580c" stroke-width="1.4"/><text x="332" y="18.5" font-family="Segoe UI, Arial, sans-serif" font-size="11" font-weight="400" text-anchor="start" fill="#374151">Loss KD</text><rect x="460" y="8" width="16" height="12" rx="3" fill="#f3f4f6" stroke="#6b7280" stroke-width="1.4" stroke-dasharray="4 3"/><text x="482" y="18.5" font-family="Segoe UI, Arial, sans-serif" font-size="11" font-weight="400" text-anchor="start" fill="#374151">Đóng băng (nét đứt)</text><rect x="10" y="40" width="100" height="56" rx="8" fill="#f3f4f6" stroke="#6b7280" stroke-width="1.6"/><text x="60.0" y="64.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">Nhiễu thật</text><text x="60.0" y="80.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">(B, 64000)</text><rect x="140" y="40" width="130" height="56" rx="8" fill="#dbeafe" stroke="#2563eb" stroke-width="1.6"/><text x="205.0" y="64.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">RMS + fbank</text><text x="205.0" y="80.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">RMS 0.07925</text><rect x="300" y="40" width="190" height="56" rx="8" fill="#dbeafe" stroke="#2563eb" stroke-width="1.6" stroke-dasharray="6 4"/><text x="395.0" y="64.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">BEATs fold 0</text><text x="395.0" y="80.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">12 lớp, fine-tune 36 lớp</text><path d="M110 68 L140 68" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M270 68 L300 68" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="300" y="165" width="190" height="56" rx="8" fill="#ffedd5" stroke="#ea580c" stroke-width="1.6"/><text x="395.0" y="189.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">L_qkv</text><text x="395.0" y="205.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">cosine + KL quan hệ</text><rect x="530" y="165" width="170" height="56" rx="8" fill="#ffedd5" stroke="#ea580c" stroke-width="1.6"/><text x="615.0" y="189.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">L_crd</text><text x="615.0" y="205.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">InfoNCE + memory bank</text><rect x="730" y="165" width="150" height="56" rx="8" fill="#ffedd5" stroke="#ea580c" stroke-width="1.6"/><text x="805.0" y="189.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">L_logit (tắt)</text><text x="805.0" y="205.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">KL, T = 4</text><path d="M395 96 L395 165" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><text x="470" y="135" font-family="Segoe UI, Arial, sans-serif" font-size="11" fill="#374151" text-anchor="middle">q, k, v của 12 lớp</text><path d="M490 68 L615 68 L615 165" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><text x="552" y="60" font-family="Segoe UI, Arial, sans-serif" font-size="11" fill="#374151" text-anchor="middle">embedding 768</text><path d="M490 82 L805 82 L805 165" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><text x="720" y="76" font-family="Segoe UI, Arial, sans-serif" font-size="11" fill="#374151" text-anchor="middle">logit 36 (head teacher)</text><rect x="10" y="300" width="90" height="56" rx="8" fill="#f3f4f6" stroke="#6b7280" stroke-width="1.6"/><text x="55.0" y="324.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">Mixture</text><text x="55.0" y="340.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">(B, 64000)</text><rect x="125" y="300" width="115" height="56" rx="8" fill="#dcfce7" stroke="#16a34a" stroke-width="1.6" stroke-dasharray="6 4"/><text x="182.5" y="324.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">FRCRN (mask)</text><text x="182.5" y="340.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">best_e037</text><rect x="265" y="300" width="80" height="56" rx="8" fill="#dcfce7" stroke="#16a34a" stroke-width="1.6"/><text x="305.0" y="324.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">log-mel</text><text x="305.0" y="340.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">128 × 398</text><rect x="375" y="300" width="220" height="56" rx="8" fill="#dcfce7" stroke="#16a34a" stroke-width="1.6"/><text x="485.0" y="324.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">MobileViT 12 lớp</text><text x="485.0" y="340.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">L = 2, 6, 4 · d = 768 · 12 head</text><rect x="625" y="300" width="90" height="56" rx="8" fill="#dcfce7" stroke="#16a34a" stroke-width="1.6"/><text x="670.0" y="324.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">Logit</text><text x="670.0" y="340.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">att. pooling</text><rect x="745" y="300" width="90" height="56" rx="8" fill="#ffedd5" stroke="#ea580c" stroke-width="1.6"/><text x="790.0" y="324.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">CE</text><text x="790.0" y="340.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">label smooth 0.1</text><path d="M100 328 L125 328" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M240 328 L265 328" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><text x="253" y="321" font-family="Segoe UI, Arial, sans-serif" font-size="11" fill="#374151" text-anchor="middle">n̂</text><path d="M345 328 L375 328" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M595 328 L625 328" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M715 328 L745 328" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M410 300 L410 221" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><text x="352" y="262" font-family="Segoe UI, Arial, sans-serif" font-size="11" fill="#374151" text-anchor="middle">q, k, v 12 lớp</text><path d="M570 300 L570 221" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><text x="640" y="262" font-family="Segoe UI, Arial, sans-serif" font-size="11" fill="#374151" text-anchor="middle">embedding 768</text><path d="M680 300 L680 270 L805 270 L805 221" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><text x="745" y="264" font-family="Segoe UI, Arial, sans-serif" font-size="11" fill="#374151" text-anchor="middle">logit</text><text x="450" y="398" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" text-anchor="middle" fill="#111827">Loss = CE + λ_qkv · L_qkv + λ_crd · L_crd + λ_logit · L_logit   (λ tăng tuyến tính trong 5 epoch đầu)</text></svg>"/></p>

    <p align="center"><em>Hình 1. Tổng quan: teacher nhận nhiễu thật, student nhận mixture, hai loss KD nối hai nhánh.</em></p>
    """)
    return


@app.cell
def _():
    # (0) Import
    import copy
    import math
    import sys
    from collections import namedtuple
    from dataclasses import dataclass, replace
    from pathlib import Path

    import numpy as np
    import pandas as pd
    import timm
    import torch
    import torch.nn.functional as F
    from torch import Tensor, nn
    from torch.optim import AdamW
    from torch.utils.data import Dataset, Subset
    from tqdm.auto import tqdm

    ROOT = Path.cwd()
    if ROOT.name == "notebook":
        ROOT = ROOT.parent
    if str(ROOT) not in sys.path:
        sys.path.insert(0, str(ROOT))
    return (
        AdamW,
        Dataset,
        F,
        Path,
        ROOT,
        Subset,
        Tensor,
        math,
        namedtuple,
        nn,
        np,
        pd,
        torch,
        tqdm,
    )


@app.cell
def _(ROOT):
    # (1) Cấu hình thí nghiệm. Đổi MỘT cờ mỗi lần để ablation.
    EXPERIMENT = "beat-mv-kd"
    RUN_TRAINING = True           # False: smoke test nhỏ vào output/test
    USE_QKV = True                # L_qkv
    USE_CRD = True                # L_crd
    USE_LOGIT = True              # L_logit: KL(softmax(z_t/T) || softmax(z_s/T)) trên logit 36 lớp của teacher fold 0 (T = 4, trọng số 1,0 trong KD); False để tắt
    USE_DRIVE = True              # backup best.pt, resume.pt, history, log lên Google Drive (đăng nhập ở cell 2b)
    DRIVE_DIR = "FA26_Capstone/Truong/beat-mv-kd-v3"  # thư mục mới: beat-mv-kd và beat-mv-kd-v2 trên Drive đã có bản trùng tên (MultipleFilesError)
    USE_NHAT_CACHE = True         # tính trước n^ = FRCRN(mixture) một lần (FRCRN đóng băng, mixture không augment nên n^ không đổi); chỉ dùng khi RUN_TRAINING
    NHAT_CACHE_DIR = ROOT / "cache" / "nhat"
    NHAT_ZIP = ROOT / "nhat_cache.zip"                     # nén lossless thư mục cache/ (khoảng 8,6 GB), nằm NGOÀI cache/ để không tự nén chính nó
    NHAT_DRIVE_ZIP = f"{DRIVE_DIR}/nhat/nhat_cache.zip"    # bản lưu trên Drive: sandbox mới chỉ cần tải về và giải nén thay vì tính lại (khoảng 17 phút)
    UPLOAD_NHAT_TO_DRIVE = True                            # đẩy zip lên Drive một lần nếu Drive chưa có (khoảng 8 phút, chặn huấn luyện); False để bỏ qua
    USE_AUG = True                # augmentation nhất quán trên cặp (n^ cho student, nhiễu thật cho teacher): dịch vòng thời gian + mixup; cần USE_NHAT_CACHE
    AUG = dict(shift=True, mixup_prob=0.5, mixup_alpha=0.4)  # mixup_prob: xác suất một batch được trộn; alpha của Beta(alpha, alpha)
    NUM_WORKERS = 8

    BEAT_FOLD = 0
    BEAT_FT_PATH = ROOT / "pretrained" / "beat-ft" / f"beats_teacher_fold{BEAT_FOLD}_weights.pt"
    FRCRN_PATH = ROOT / "pretrained" / "FRCRN" / "best_e037_20261020T203958Z.pt"
    BEATS_CONFIG = ROOT / "config" / "beat.yaml"
    FRCRN_CONFIG = ROOT / "config" / "frcrn.yaml"

    TEACHER_LAYERS = tuple(range(1, 13))  # cả 12 lớp BEATs (đếm từ 1) lấy q/k/v
    # MobileViT 12 lớp: khối 1 (2 lớp) <-> BEATs 1-2, khối 2 (6 lớp) <-> BEATs 3-8, khối 3 (4 lớp) <-> BEATs 9-12
    STUDENT = dict(dim=768, heads=12, ffn_dim=768, layers=(2, 6, 4), channels=(96, 128, 160), patch=2)
    assert sum(STUDENT["layers"]) == len(TEACHER_LAYERS) and STUDENT["dim"] == 768 and STUDENT["heads"] == 12
    TARGET_RMS = 0.07925          # chuẩn hoá RMS nhiễu trước fbank, như reviewkd.yaml
    NUM_CLASSES = 36
    SNR_LEVELS = (-5, 0, 5, 10, 15, 20)

    KD = dict(
        qkv_weight=1.0,           # λ_qkv (chưa tinh chỉnh)
        rel_weight=1.0,           # trọng số KL quan hệ so với cosine bên trong L_qkv
        crd_weight=0.5,           # λ_crd (chưa tinh chỉnh)
        logit_weight=1.0,         # λ_logit (chưa tinh chỉnh)
        logit_temperature=4.0,    # như loss.kd.temperature trong beat.yaml
        crd_dim=128,
        crd_negatives=4096,
        crd_temperature=0.07,
        crd_momentum=0.5,
        warmup_epochs=5,
    )

    FRONTEND = dict(sample_rate=16000, n_fft=512, win_length=400, hop_length=160, n_mels=128,
                    f_min=20.0, f_max=8000.0, num_frames=398, log_eps=1e-6, norm_eps=1e-5)
    SPECAUG = dict(freq_masks=2, freq_width=16, time_masks=2, time_width=24)

    TRAIN = dict(lr=1e-4, weight_decay=0.1, betas=(0.9, 0.999), warmup_ratio=0.05,
                 lr_factor=0.5, lr_patience=2, lr_threshold=0.005, min_lr=1e-6,  # ReduceLROnPlateau theo val macro_acc, mỗi epoch
                 label_smoothing=0.1, grad_clip=1.0, batch_size=32, eval_batch_size=64,
                 epochs=50, patience=15, dropout=0.3, drop_path=0.1, seed=42)

    # Hard-negative: các nhóm lớp hay nhầm nhau, lấy từ ma trận nhầm lẫn trên validation (epoch 27 của thí nghiệm tham chiếu), nên mức cải thiện trên các lớp này
    # một phần là do chọn nhóm theo validation. Mỗi lớp thuộc nhiều nhất một nhóm; tên khớp đầy đủ hoặc tiền tố với tên lớp của dataset.
    HN_GROUPS = (
        ("Saxophone", "Clarinet", "Trumpet", "Flute", "Harmonica", "Violin"),
        ("Glockenspiel", "Chime", "Electric piano", "Acoustic guitar", "Telephone"),
        ("Knock", "Gunshot", "Shatter", "Fireworks"),
        ("Scissors", "Tearing", "Writing", "Keys jangling", "Computer keyboard"),
        ("Microwave oven", "Gong", "Bus"),
        ("Fart", "Meow"),
    )

    # Hàng đợi thí nghiệm cho cell (9), chạy lần lượt. Mỗi nhánh ablation khác thí nghiệm THAM CHIẾU (cả ba loss KD, 50 epoch, cfg rỗng) đúng một núm,
    # trừ "ce" (bỏ cả ba loss). Thí nghiệm tham chiếu không chạy lại: lấy từ history trong resume.pt của nó để so ở cùng ngân sách epoch.
    # Khoá của một phần tử: tag, qkv, crd, logit (bật/tắt loss), T (nhiệt độ logit), qkv_layers (lớp BEATs 1-12 có loss q/k/v), hn (trọng số hard-negative),
    # init_from ("reference" hoặc đường dẫn resume.pt: khởi tạo từ best_state), kd_decay_epochs (giảm tuyến tính KD về 0), lr, warmup_ratio,
    # max_epochs (dừng sớm nhưng GIỮ lịch lr và warm-up của TRAIN["epochs"], nên so cặp được với tham chiếu), eval_test (False: chưa động tới test).
    # Thời gian ước tính trên GPU sandbox: khoảng 3 phút mỗi epoch có teacher (gồm upload Drive). Hàng đợi mặc định: 4 x 15 = 60 epoch, khoảng 3 giờ.
    RUN_TAG = "r6"                # gắn vào tên mọi thí nghiệm khác tham chiếu, để không đụng resume.pt và thư mục Drive cũ
    RUNS = [
        # ESKD (tuỳ chọn, mặc định tắt): nhánh duy nhất không huấn luyện từ đầu, vì khởi tạo từ best_state của thí nghiệm tham chiếu.
        # dict(tag="eskd", init_from="reference", crd=False, kd_decay_epochs=8, lr=1e-5, warmup_ratio=0.0, max_epochs=10, eval_test=False),  # ESKD: tắt dần KD từ best_state
        dict(tag="no-crd", crd=False, max_epochs=15, eval_test=False),
        dict(tag="no-qkv", qkv=False, max_epochs=15, eval_test=False),
        dict(tag="ce", qkv=False, crd=False, logit=False, max_epochs=15, eval_test=False),
        dict(tag="hn", hn=1.0, max_epochs=15, eval_test=False),
        # Thêm nhánh (mỗi dòng khoảng 40 phút):
        # dict(tag="T2", T=2.0, max_epochs=15, eval_test=False),
        # dict(tag="qkv9-12", qkv_layers=(9, 10, 11, 12), max_epochs=15, eval_test=False),
    ]
    return (
        AUG,
        BEATS_CONFIG,
        BEAT_FT_PATH,
        DRIVE_DIR,
        EXPERIMENT,
        FRCRN_CONFIG,
        FRCRN_PATH,
        FRONTEND,
        HN_GROUPS,
        KD,
        NHAT_CACHE_DIR,
        NHAT_DRIVE_ZIP,
        NHAT_ZIP,
        NUM_CLASSES,
        NUM_WORKERS,
        RUNS,
        RUN_TAG,
        RUN_TRAINING,
        SNR_LEVELS,
        SPECAUG,
        STUDENT,
        TARGET_RMS,
        TEACHER_LAYERS,
        TRAIN,
        UPLOAD_NHAT_TO_DRIVE,
        USE_AUG,
        USE_CRD,
        USE_DRIVE,
        USE_LOGIT,
        USE_NHAT_CACHE,
        USE_QKV,
    )


@app.cell
def _(
    EXPERIMENT,
    Path,
    ROOT,
    RUN_TRAINING,
    USE_CRD,
    USE_LOGIT,
    USE_QKV,
    torch,
):
    # (2) Đường dẫn đầu ra, logger, thiết bị
    from src.utils.logger import setup_logger
    from src.utils.paths import RunPaths
    from src.utils.seed import set_seed

    output_dir = Path("output") if RUN_TRAINING else Path("output") / "test"
    run = RunPaths.new(EXPERIMENT if RUN_TRAINING else f"{EXPERIMENT}-smoke", ROOT / output_dir)
    run.create()
    logger = setup_logger(EXPERIMENT, run.log_file)
    device = torch.device("cuda" if torch.cuda.is_available() else "cpu")
    amp = lambda: torch.autocast(device.type, dtype=torch.bfloat16, enabled=device.type == "cuda")
    logger.info("run %s | device %s | RUN_TRAINING=%s | qkv=%s crd=%s logit=%s", run.run_id, device, RUN_TRAINING, USE_QKV, USE_CRD, USE_LOGIT)
    return amp, device, logger, run, set_seed


@app.cell
def _(DRIVE_DIR, RUN_TRAINING, USE_DRIVE, logger):
    # (2b) Google Drive: lần đầu hiện liên kết đăng nhập, đăng nhập xong cell mới chạy tiếp. fs = None khi tắt hoặc smoke test.
    fs = None
    if USE_DRIVE and RUN_TRAINING:
        from gdrive_fsspec import GoogleDriveFileSystem

        fs = GoogleDriveFileSystem(use_listings_cache=False, skip_instance_cache=True, auth_kwargs={"use_local_webserver": False})
    logger.info("drive: %s", f"bật, thư mục {DRIVE_DIR}" if fs is not None else "tắt")
    return (fs,)


@app.cell(hide_code=True)
def _(mo):
    mo.md(r"""
    ## Teacher: nhiễu → BEATs (fold 0, đóng băng)

    Checkpoint `beat-ft` lưu theo tên khoá BEATs gốc (`encoder.model.*`, `head.*`), nên cần đổi tên sang `BEATClassifier`. `convert_checkpoint` của repo lo phần `backbone.*`, `fc1/fc2` và `patch_embedding`; head đổi tay thành `head.fc.*`. Nạp xong kiểm tra không thiếu hay thừa khoá nào.

    q/k/v lấy bằng forward hook trên `q_proj/k_proj/v_proj` của `GatedRelPosAttention`, tức là trước khi chia head. Mỗi tensor có dạng (B, N, 768) với N = 8 × 24 token, thứ tự (thời gian, tần số), cùng thứ tự với `tokens_to_grid` của repo.
    """)
    return


@app.cell(hide_code=True)
def _(mo):
    mo.md(r"""
    <p align="center"><img alt="Teacher BEATs" src="data:image/svg+xml;base64,<svg xmlns="http://www.w3.org/2000/svg" width="1000" height="360" viewBox="0 0 1000 360"><title>Teacher BEATs và điểm lấy q, k, v của cả 12 lớp</title><defs><marker id="arr" viewBox="0 0 10 10" refX="9" refY="5" markerWidth="7" markerHeight="7" orient="auto-start-reverse"><path d="M0 0 L10 5 L0 10 z" fill="#4b5563"/></marker></defs><rect width="1000" height="360" fill="#ffffff"/><rect x="10" y="8" width="16" height="12" rx="3" fill="#dbeafe" stroke="#2563eb" stroke-width="1.4"/><text x="32" y="18.5" font-family="Segoe UI, Arial, sans-serif" font-size="11" font-weight="400" text-anchor="start" fill="#374151">Teacher</text><rect x="160" y="8" width="16" height="12" rx="3" fill="#fef9c3" stroke="#ca8a04" stroke-width="1.4"/><text x="182" y="18.5" font-family="Segoe UI, Arial, sans-serif" font-size="11" font-weight="400" text-anchor="start" fill="#374151">Lấy q, k, v</text><rect x="310" y="8" width="16" height="12" rx="3" fill="#ffedd5" stroke="#ea580c" stroke-width="1.4"/><text x="332" y="18.5" font-family="Segoe UI, Arial, sans-serif" font-size="11" font-weight="400" text-anchor="start" fill="#374151">Dùng cho loss</text><rect x="460" y="8" width="16" height="12" rx="3" fill="#f3f4f6" stroke="#6b7280" stroke-width="1.4" stroke-dasharray="4 3"/><text x="482" y="18.5" font-family="Segoe UI, Arial, sans-serif" font-size="11" font-weight="400" text-anchor="start" fill="#374151">Đóng băng</text><rect x="10" y="40" width="90" height="56" rx="8" fill="#f3f4f6" stroke="#6b7280" stroke-width="1.6"/><text x="55.0" y="64.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">Nhiễu thật</text><text x="55.0" y="80.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">(B, 64000)</text><rect x="125" y="40" width="110" height="56" rx="8" fill="#dbeafe" stroke="#2563eb" stroke-width="1.6" stroke-dasharray="6 4"/><text x="180.0" y="64.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">Chuẩn hoá RMS</text><text x="180.0" y="80.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">target 0.07925</text><rect x="260" y="40" width="110" height="56" rx="8" fill="#dbeafe" stroke="#2563eb" stroke-width="1.6" stroke-dasharray="6 4"/><text x="315.0" y="64.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">Fbank</text><text x="315.0" y="80.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">(B, 398, 128)</text><rect x="395" y="40" width="130" height="56" rx="8" fill="#dbeafe" stroke="#2563eb" stroke-width="1.6" stroke-dasharray="6 4"/><text x="460.0" y="64.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">Patch embed</text><text x="460.0" y="80.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">16×16 → 512, LN</text><rect x="550" y="40" width="130" height="56" rx="8" fill="#dbeafe" stroke="#2563eb" stroke-width="1.6" stroke-dasharray="6 4"/><text x="615.0" y="64.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">post_extract_proj</text><text x="615.0" y="80.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">512 → 768</text><path d="M100 68 L125 68" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M235 68 L260 68" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M370 68 L395 68" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M525 68 L550 68" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><text x="705" y="62" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" text-anchor="start" fill="#374151">N = 8 × 24 = 192 token</text><text x="705" y="78" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" text-anchor="start" fill="#374151">thứ tự (thời gian, tần số)</text><path d="M615 96 L615 132 L48 132 L48 170" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><text x="330" y="126" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" text-anchor="middle" fill="#374151">pos_conv + LayerNorm, rồi 12 lớp Transformer (post-LN, DeepNorm)</text><rect x="20" y="170" width="56" height="56" rx="8" fill="#fef9c3" stroke="#ca8a04" stroke-width="1.6"/><text x="48.0" y="202.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">L1</text><path d="M76 198 L82 198" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="82" y="170" width="56" height="56" rx="8" fill="#fef9c3" stroke="#ca8a04" stroke-width="1.6"/><text x="110.0" y="202.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">L2</text><path d="M138 198 L144 198" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="144" y="170" width="56" height="56" rx="8" fill="#fef9c3" stroke="#ca8a04" stroke-width="1.6"/><text x="172.0" y="202.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">L3</text><path d="M200 198 L206 198" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="206" y="170" width="56" height="56" rx="8" fill="#fef9c3" stroke="#ca8a04" stroke-width="1.6"/><text x="234.0" y="202.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">L4</text><path d="M262 198 L268 198" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="268" y="170" width="56" height="56" rx="8" fill="#fef9c3" stroke="#ca8a04" stroke-width="1.6"/><text x="296.0" y="202.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">L5</text><path d="M324 198 L330 198" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="330" y="170" width="56" height="56" rx="8" fill="#fef9c3" stroke="#ca8a04" stroke-width="1.6"/><text x="358.0" y="202.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">L6</text><path d="M386 198 L392 198" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="392" y="170" width="56" height="56" rx="8" fill="#fef9c3" stroke="#ca8a04" stroke-width="1.6"/><text x="420.0" y="202.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">L7</text><path d="M448 198 L454 198" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="454" y="170" width="56" height="56" rx="8" fill="#fef9c3" stroke="#ca8a04" stroke-width="1.6"/><text x="482.0" y="202.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">L8</text><path d="M510 198 L516 198" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="516" y="170" width="56" height="56" rx="8" fill="#fef9c3" stroke="#ca8a04" stroke-width="1.6"/><text x="544.0" y="202.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">L9</text><path d="M572 198 L578 198" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="578" y="170" width="56" height="56" rx="8" fill="#fef9c3" stroke="#ca8a04" stroke-width="1.6"/><text x="606.0" y="202.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">L10</text><path d="M634 198 L640 198" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="640" y="170" width="56" height="56" rx="8" fill="#fef9c3" stroke="#ca8a04" stroke-width="1.6"/><text x="668.0" y="202.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">L11</text><path d="M696 198 L702 198" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="702" y="170" width="56" height="56" rx="8" fill="#fef9c3" stroke="#ca8a04" stroke-width="1.6"/><text x="730.0" y="202.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">L12</text><path d="M391 226 L391 272" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="166" y="272" width="450" height="62" rx="8" fill="#ffedd5" stroke="#ea580c" stroke-width="1.6"/><text x="391.0" y="292.0" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">q, k, v của cả 12 lớp</text><text x="391.0" y="307.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">hook q_proj / k_proj / v_proj, trước khi chia head</text><text x="391.0" y="323.0" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">(12, 3, B, 192, 768)</text><path d="M776 198 L800 198" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="800" y="170" width="190" height="56" rx="8" fill="#ffedd5" stroke="#ea580c" stroke-width="1.6"/><text x="895.0" y="194.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">mean pool token</text><text x="895.0" y="210.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">embedding (B, 768) → CRD</text><path d="M910 226 L910 270" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="830" y="270" width="160" height="56" rx="8" fill="#ffedd5" stroke="#ea580c" stroke-width="1.6" stroke-dasharray="6 4"/><text x="910.0" y="294.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">head Linear 768→36</text><text x="910.0" y="310.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">logit → L_logit</text></svg>"/></p>

    <p align="center"><em>Hình 2. Teacher: lấy q/k/v của cả 12 lớp và embedding cho CRD.</em></p>
    """)
    return


@app.cell
def _(
    BEATS_CONFIG,
    BEAT_FT_PATH,
    FRONTEND,
    Path,
    TARGET_RMS,
    TEACHER_LAYERS,
    Tensor,
    amp,
    device,
    logger,
    namedtuple,
    nn,
    torch,
):
    # (3) Teacher
    from src.model.beat import BEATClassifier
    from src.model.reviewkd import rms_normalize

    TeacherOutput = namedtuple("TeacherOutput", "qkv embedding logits")


    def load_fold_teacher(path: Path) -> BEATClassifier:
        checkpoint = torch.load(path, map_location="cpu", weights_only=False)
        state = checkpoint["state_dict"]
        backbone = {k.removeprefix("encoder.model."): v for k, v in state.items() if k.startswith("encoder.model.")}
        beats = BEATClassifier.from_yaml(BEATS_CONFIG)
        converted = beats.convert_checkpoint({"model": backbone})
        converted["head.fc.weight"], converted["head.fc.bias"] = state["head.weight"], state["head.bias"]
        result = beats.load_state_dict(converted, strict=False)
        if result.missing_keys or result.unexpected_keys:
            raise ValueError(f"missing {result.missing_keys[:5]}, unexpected {result.unexpected_keys[:5]}")
        logger.info("teacher fold %s | epoch %s | clean_val_accuracy %.4f | macro_f1 %.4f", checkpoint["fold"],
                    checkpoint["best_epoch"], checkpoint["clean_val_accuracy"], checkpoint["clean_val_macro_f1"])
        return beats


    class QKVTeacher(nn.Module):
        """nhiễu thật -> RMS -> fbank -> BEATs. Trả q/k/v (L, 3, B, N, 768), embedding (B, 768), logits (B, 36)."""

        def __init__(self, beats: BEATClassifier, layers: tuple[int, ...], target_rms: float) -> None:
            super().__init__()
            self.beats = beats.freeze()
            self.layers = tuple(layers)
            self.target_rms = target_rms
            self.freq_bins = beats.frontend.num_mel_bins // beats.config.input_patch_size
            self._captured: dict[tuple[int, str], Tensor] = {}
            for layer in self.layers:
                attention = beats.backbone.encoder.layers[layer - 1].self_attn
                for name in "qkv":
                    getattr(attention, f"{name}_proj").register_forward_hook(self._hook(layer, name))

        def _hook(self, layer: int, name: str):
            def capture(module, inputs, output):
                self._captured[(layer, name)] = output
            return capture

        def train(self, mode: bool = True) -> "QKVTeacher":
            return super().train(False)

        @torch.no_grad()
        def forward(self, noise: Tensor) -> TeacherOutput:
            fbank = self.beats.frontend(rms_normalize(noise.float(), self.target_rms))  # fp32: kaldi fbank
            with amp():
                output = self.beats(fbank, is_waveform=False)
            qkv = torch.stack([torch.stack([self._captured[(layer, name)].float() for name in "qkv"]) for layer in self.layers])
            self._captured.clear()
            return TeacherOutput(qkv, output.features.float().mean(dim=1), output.logits.float())


    teacher = QKVTeacher(load_fold_teacher(BEAT_FT_PATH), TEACHER_LAYERS, TARGET_RMS).to(device)
    with torch.no_grad():
        _probe = teacher(torch.randn(2, 4 * FRONTEND["sample_rate"], device=device) * 0.05)
    TEACHER_TOKENS = _probe.qkv.shape[3]
    GRID = (teacher.freq_bins, TEACHER_TOKENS // teacher.freq_bins)  # (tần số, thời gian) = (8, 24)
    logger.info("teacher qkv %s | embedding %s | lưới token %s", tuple(_probe.qkv.shape), tuple(_probe.embedding.shape), GRID)
    del _probe
    return GRID, teacher


@app.cell(hide_code=True)
def _(mo):
    mo.md(r"""
    ## Student: mixture → FRCRN (mask, đóng băng) → n̂ → log-mel → MobileViT 12 lớp

    `FRCRNSeparator.forward` đã trả n̂ = mixture − ŝ khi `target: speech` trong `frcrn.yaml`. Student là MobileViT-S sửa theo đặc tả: stem, các khối MV2 và ba khối MobileViT với **L = (2, 6, 4) lớp Transformer, d = 768, 12 head × 64, FFN 768, patch 2×2**, conv 1×1 cuối 768 kênh. Tổng 12 lớp, mỗi lớp khớp một lớp BEATs về d và số head nên không cần adapter: q, k, v lấy thẳng từ `attn.qkv` của từng lớp (trung bình theo 4 vị trí trong patch).

    Đầu ra: trung bình theo trục tần số, rồi attention pooling theo thời gian cho từng lớp (nhánh `att` softmax, nhánh `cla` logit). Dự án này là phân loại **đơn nhãn 36 lớp, clip 4 s (398 khung)**, nên logit đi vào CE; đặc tả gốc là AudioSet 527 lớp đa nhãn, 10 s (998 khung) với BCE và sigmoid, và những phần đó không áp dụng ở đây. FRCRN và log-mel chạy fp32, chỉ MobileViT chạy bf16.
    """)
    return


@app.cell(hide_code=True)
def _(mo):
    mo.md(r"""
    <p align="center"><img alt="Student FRCRN và MobileViT 12 lớp" src="data:image/svg+xml;base64,<svg xmlns="http://www.w3.org/2000/svg" width="1000" height="420" viewBox="0 0 1000 420"><title>Student: FRCRN và MobileViT 12 lớp</title><defs><marker id="arr" viewBox="0 0 10 10" refX="9" refY="5" markerWidth="7" markerHeight="7" orient="auto-start-reverse"><path d="M0 0 L10 5 L0 10 z" fill="#4b5563"/></marker></defs><rect width="1000" height="420" fill="#ffffff"/><rect x="10" y="8" width="16" height="12" rx="3" fill="#dcfce7" stroke="#16a34a" stroke-width="1.4"/><text x="32" y="18.5" font-family="Segoe UI, Arial, sans-serif" font-size="11" font-weight="400" text-anchor="start" fill="#374151">Student</text><rect x="160" y="8" width="16" height="12" rx="3" fill="#fef9c3" stroke="#ca8a04" stroke-width="1.4"/><text x="182" y="18.5" font-family="Segoe UI, Arial, sans-serif" font-size="11" font-weight="400" text-anchor="start" fill="#374151">Khối MobileViT</text><rect x="310" y="8" width="16" height="12" rx="3" fill="#ffedd5" stroke="#ea580c" stroke-width="1.4"/><text x="332" y="18.5" font-family="Segoe UI, Arial, sans-serif" font-size="11" font-weight="400" text-anchor="start" fill="#374151">Dùng cho loss</text><rect x="460" y="8" width="16" height="12" rx="3" fill="#f3f4f6" stroke="#6b7280" stroke-width="1.4" stroke-dasharray="4 3"/><text x="482" y="18.5" font-family="Segoe UI, Arial, sans-serif" font-size="11" font-weight="400" text-anchor="start" fill="#374151">Đóng băng / dữ liệu</text><rect x="10" y="40" width="100" height="56" rx="8" fill="#f3f4f6" stroke="#6b7280" stroke-width="1.6"/><text x="60.0" y="64.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">Mixture</text><text x="60.0" y="80.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">(B, 64000)</text><rect x="140" y="40" width="190" height="56" rx="8" fill="#dcfce7" stroke="#16a34a" stroke-width="1.6" stroke-dasharray="6 4"/><text x="235.0" y="64.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">FRCRN (mask)</text><text x="235.0" y="80.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">STFT → U-Net → mask → iSTFT</text><rect x="360" y="40" width="120" height="56" rx="8" fill="#dcfce7" stroke="#16a34a" stroke-width="1.6"/><text x="420.0" y="64.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">n̂ = mixture − ŝ</text><text x="420.0" y="80.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">(B, 64000)</text><rect x="510" y="40" width="120" height="56" rx="8" fill="#dcfce7" stroke="#16a34a" stroke-width="1.6"/><text x="570.0" y="64.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">log-mel</text><text x="570.0" y="80.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">chuẩn hoá theo clip</text><rect x="660" y="40" width="120" height="56" rx="8" fill="#dcfce7" stroke="#16a34a" stroke-width="1.6"/><text x="720.0" y="64.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">SpecAugment</text><text x="720.0" y="80.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">chỉ lúc train</text><rect x="810" y="40" width="180" height="56" rx="8" fill="#f3f4f6" stroke="#6b7280" stroke-width="1.6"/><text x="900.0" y="64.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">(B, 1, 128, 398)</text><text x="900.0" y="80.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">đầu vào MobileViT</text><path d="M110 68 L140 68" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M330 68 L360 68" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M480 68 L510 68" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M630 68 L660 68" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M780 68 L810 68" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M900 96 L900 132 L70 132 L70 170" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><text x="500" y="152" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" text-anchor="middle" fill="#374151">MobileViT-S sửa: d = 768, 12 head × 64, FFN 768, patch 2×2 (4 vị trí mỗi patch)</text><rect x="20" y="170" width="120" height="56" rx="8" fill="#dcfce7" stroke="#16a34a" stroke-width="1.6"/><text x="80.0" y="194.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">stem + MV2</text><text x="80.0" y="210.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">16 → 32 → 64</text><path d="M140 198 L150 198" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="150" y="170" width="80" height="56" rx="8" fill="#dcfce7" stroke="#16a34a" stroke-width="1.6"/><text x="190.0" y="194.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">MV2 ↓2</text><text x="190.0" y="210.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">96 · 16×50</text><path d="M230 198 L240 198" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="240" y="170" width="104" height="56" rx="8" fill="#fef9c3" stroke="#ca8a04" stroke-width="1.6"/><text x="292.0" y="194.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">MobileViT 1</text><text x="292.0" y="210.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">L = 2</text><path d="M344 198 L354 198" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="354" y="170" width="80" height="56" rx="8" fill="#dcfce7" stroke="#16a34a" stroke-width="1.6"/><text x="394.0" y="194.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">MV2 ↓2</text><text x="394.0" y="210.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">128 · 8×25</text><path d="M434 198 L444 198" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="444" y="170" width="104" height="56" rx="8" fill="#fef9c3" stroke="#ca8a04" stroke-width="1.6"/><text x="496.0" y="194.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">MobileViT 2</text><text x="496.0" y="210.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">L = 6</text><path d="M548 198 L558 198" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="558" y="170" width="80" height="56" rx="8" fill="#dcfce7" stroke="#16a34a" stroke-width="1.6"/><text x="598.0" y="194.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">MV2 ↓2</text><text x="598.0" y="210.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">160 · 4×13</text><path d="M638 198 L648 198" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="648" y="170" width="104" height="56" rx="8" fill="#fef9c3" stroke="#ca8a04" stroke-width="1.6"/><text x="700.0" y="194.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">MobileViT 3</text><text x="700.0" y="210.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">L = 4</text><path d="M752 198 L762 198" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="762" y="170" width="96" height="56" rx="8" fill="#dcfce7" stroke="#16a34a" stroke-width="1.6"/><text x="810.0" y="194.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">conv 1×1</text><text x="810.0" y="210.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">→ 768 · 4×13</text><path d="M858 198 L868 198" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="868" y="170" width="96" height="56" rx="8" fill="#ffedd5" stroke="#ea580c" stroke-width="1.6"/><text x="916.0" y="194.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">att pooling</text><text x="916.0" y="210.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">logit 36 → CE</text><path d="M292.0 226 L292.0 282" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="200.0" y="282" width="184" height="70" rx="8" fill="#ffedd5" stroke="#ea580c" stroke-width="1.6"/><text x="292.0" y="306.0" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">attn.qkv từng lớp</text><text x="292.0" y="321.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">lớp 1-2 ↔ BEATs 1-2</text><text x="292.0" y="337.0" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">q, k, v (B, 200, 768)</text><path d="M496.0 226 L496.0 282" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="404.0" y="282" width="184" height="70" rx="8" fill="#ffedd5" stroke="#ea580c" stroke-width="1.6"/><text x="496.0" y="306.0" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">attn.qkv từng lớp</text><text x="496.0" y="321.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">lớp 1-6 ↔ BEATs 3-8</text><text x="496.0" y="337.0" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">q, k, v (B, 52, 768)</text><path d="M700.0 226 L700.0 282" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="608.0" y="282" width="184" height="70" rx="8" fill="#ffedd5" stroke="#ea580c" stroke-width="1.6"/><text x="700.0" y="306.0" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">attn.qkv từng lớp</text><text x="700.0" y="321.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">lớp 1-4 ↔ BEATs 9-12</text><text x="700.0" y="337.0" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">q, k, v (B, 14, 768)</text><path d="M810.0 226 L810.0 282" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="796" y="282" width="124" height="70" rx="8" fill="#ffedd5" stroke="#ea580c" stroke-width="1.6"/><text x="858.0" y="313.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">mean pool</text><text x="858.0" y="329.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">emb. 768 → CRD</text><text x="500" y="392" font-family="Segoe UI, Arial, sans-serif" font-size="12" font-weight="600" text-anchor="middle" fill="#111827">12 lớp Transformer ↔ 12 lớp BEATs theo thứ tự; lưới token teacher (8×24) được pool về lưới của từng khối student</text></svg>"/></p>

    <p align="center"><em>Hình 3. Student: FRCRN cho n̂, MobileViT 12 lớp (2 + 6 + 4) và điểm lấy q/k/v của từng lớp.</em></p>
    """)
    return


@app.cell
def _(
    FRCRN_CONFIG,
    FRCRN_PATH,
    FRONTEND,
    GRID,
    NUM_CLASSES,
    SPECAUG,
    STUDENT,
    TEACHER_LAYERS,
    TRAIN,
    Tensor,
    amp,
    device,
    logger,
    math,
    namedtuple,
    nn,
    torch,
):
    # (4) Student: MobileViT 12 lớp, q/k/v của từng lớp lấy bằng hook trên attn.qkv
    from timm.models.byobnet import ByobNet, ByoBlockCfg, ByoModelCfg
    from timm.models.mobilevit import MobileVitBlock

    from src.model.frcrn import FRCRNSeparator
    from src.model.kdmoe.frontend import LogMel, SpecAugment

    StudentOutput = namedtuple("StudentOutput", "logits qkv grids embedding")


    def mobilevit12_cfg(spec: dict) -> ByoModelCfg:
        def inverted(d, c, s):
            return ByoBlockCfg(type="bottle", d=d, c=c, s=s, gs=1, br=4.0, block_kwargs=dict(bottle_in=True, linear_out=True))

        def vit_stage(c, depth):  # MV2 stride 2 rồi khối MobileViT
            return (inverted(1, c, 2), ByoBlockCfg(type="mobilevit", d=1, c=c, s=1, block_kwargs=dict(
                transformer_dim=spec["dim"], transformer_depth=depth, patch_size=spec["patch"], num_heads=spec["heads"],
                mlp_ratio=spec["ffn_dim"] / spec["dim"])))

        blocks = (inverted(1, 32, 1), inverted(3, 64, 2), *[vit_stage(c, d) for c, d in zip(spec["channels"], spec["layers"])])
        return ByoModelCfg(blocks=blocks, stem_chs=16, stem_type="3x3", stem_pool="", downsample="", act_layer="silu",
                           num_features=spec["dim"])


    class FRCRNMobileViT(nn.Module):
        def __init__(self, separator: FRCRNSeparator, spec: dict) -> None:
            super().__init__()
            self.separator = separator.freeze()
            self.frontend = LogMel(**FRONTEND)
            self.spec_augment = SpecAugment(**SPECAUG)
            self.net = ByobNet(mobilevit12_cfg(spec), num_classes=0, in_chans=1, drop_path_rate=TRAIN["drop_path"])
            self.dropout = nn.Dropout(TRAIN["dropout"])
            self.att = nn.Linear(spec["dim"], NUM_CLASSES)  # attention pooling: softmax theo thời gian, riêng từng lớp
            self.cla = nn.Linear(spec["dim"], NUM_CLASSES)
            self._qkv, self._grids, self._grid, self._batch = [], [], None, 0
            for block in (m for m in self.net.modules() if isinstance(m, MobileVitBlock)):
                block.conv_1x1.register_forward_hook(self._record_grid(spec["patch"]))
                for layer in block.transformer:
                    layer.attn.qkv.register_forward_hook(self._record_qkv)

        def _record_grid(self, patch: int):
            def hook(module, inputs, output):
                self._grid = (math.ceil(output.shape[-2] / patch), math.ceil(output.shape[-1] / patch))  # (tần số, thời gian)
            return hook

        def _record_qkv(self, module, inputs, output) -> None:
            # output (B*P, N, 3D) -> q, k, v (B, N, D), trung bình theo P vị trí trong patch; N theo thứ tự (tần số, thời gian)
            q, k, v = (t.view(self._batch, -1, t.shape[1], t.shape[2]).float().mean(dim=1) for t in output.chunk(3, dim=-1))
            self._qkv.append(torch.stack([q, k, v]))
            self._grids.append(self._grid)

        def train(self, mode: bool = True) -> "FRCRNMobileViT":
            super().train(mode)
            self.separator.eval()
            return self

        def forward(self, waveform: Tensor | None = None, noise_hat: Tensor | None = None) -> StudentOutput:
            source = noise_hat if noise_hat is not None else waveform
            with torch.no_grad(), torch.autocast(source.device.type, enabled=False):
                if noise_hat is None:  # không có cache: chạy FRCRN trực tiếp
                    noise_hat = self.separator(waveform.float())
                x, _ = self.frontend(noise_hat.float())
            x = self.spec_augment(x)
            self._qkv, self._grids, self._batch = [], [], x.shape[0]
            with amp():
                h = self.net.forward_features(x)                      # (B, 768, H, W)
                z = self.dropout(h.mean(dim=2).transpose(1, 2))      # trung bình theo tần số -> (B, T, 768)
                weight = self.att(z).float().softmax(dim=1)          # softmax theo thời gian
                logits = (weight * self.cla(z).float()).sum(dim=1)   # (B, 36)
            return StudentOutput(logits, tuple(self._qkv), tuple(self._grids), h.float().mean(dim=(2, 3)))

        def predict_proba(self, waveform: Tensor | None = None, noise_hat: Tensor | None = None) -> Tensor:
            return self(waveform, noise_hat).logits.softmax(dim=-1)


    def build_student() -> FRCRNMobileViT:
        separator = FRCRNSeparator.from_yaml(FRCRN_CONFIG)
        report = separator.load_pretrained(FRCRN_PATH)
        logger.info("FRCRN %s | missing %d unexpected %d", FRCRN_PATH.name, len(report.missing), len(report.unexpected))
        return FRCRNMobileViT(separator, STUDENT)


    student = build_student().to(device)
    with torch.no_grad():
        _probe = student.eval()(torch.randn(2, 4 * FRONTEND["sample_rate"], device=device) * 0.05)
    EMBED_CHANNELS = _probe.embedding.shape[1]
    assert len(_probe.qkv) == len(TEACHER_LAYERS), f"student có {len(_probe.qkv)} lớp, teacher {len(TEACHER_LAYERS)}"
    logger.info("student %.2fM tham số (transformer %.2fM) | embedding %d", sum(p.numel() for p in student.net.parameters()) / 1e6,
                sum(p.numel() for n, p in student.net.named_parameters() if ".transformer." in n) / 1e6, EMBED_CHANNELS)
    _owner = [block for block, depth in enumerate(STUDENT["layers"], 1) for _ in range(depth)]
    for _index, (_qkv, _grid) in enumerate(zip(_probe.qkv, _probe.grids)):
        logger.info("student lớp %2d (khối %d) q/k/v %s lưới token %s <-> BEATs lớp %2d (lưới %s)", _index + 1, _owner[_index],
                    tuple(_qkv.shape), _grid, TEACHER_LAYERS[_index], GRID)
    del _probe
    return EMBED_CHANNELS, FRCRNMobileViT, build_student, student


@app.cell(hide_code=True)
def _(mo):
    mo.md(r"""
    ## Loss KD: q/k/v và CRD
    """)
    return


@app.cell(hide_code=True)
def _(mo):
    mo.md(r"""
    <p align="center"><img alt="Loss q/k/v theo từng lớp" src="data:image/svg+xml;base64,<svg xmlns="http://www.w3.org/2000/svg" width="1000" height="380" viewBox="0 0 1000 380"><title>Loss q, k, v theo từng lớp</title><defs><marker id="arr" viewBox="0 0 10 10" refX="9" refY="5" markerWidth="7" markerHeight="7" orient="auto-start-reverse"><path d="M0 0 L10 5 L0 10 z" fill="#4b5563"/></marker></defs><rect width="1000" height="380" fill="#ffffff"/><rect x="10" y="8" width="16" height="12" rx="3" fill="#dcfce7" stroke="#16a34a" stroke-width="1.4"/><text x="32" y="18.5" font-family="Segoe UI, Arial, sans-serif" font-size="11" font-weight="400" text-anchor="start" fill="#374151">Student</text><rect x="160" y="8" width="16" height="12" rx="3" fill="#dbeafe" stroke="#2563eb" stroke-width="1.4"/><text x="182" y="18.5" font-family="Segoe UI, Arial, sans-serif" font-size="11" font-weight="400" text-anchor="start" fill="#374151">Teacher</text><rect x="310" y="8" width="16" height="12" rx="3" fill="#ffedd5" stroke="#ea580c" stroke-width="1.4"/><text x="332" y="18.5" font-family="Segoe UI, Arial, sans-serif" font-size="11" font-weight="400" text-anchor="start" fill="#374151">Loss</text><rect x="10" y="30" width="140" height="56" rx="8" fill="#dcfce7" stroke="#16a34a" stroke-width="1.6"/><text x="80.0" y="54.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">Lớp Transformer i</text><text x="80.0" y="70.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">khối b của student</text><rect x="175" y="30" width="180" height="56" rx="8" fill="#dcfce7" stroke="#16a34a" stroke-width="1.6"/><text x="265.0" y="54.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">attn.qkv (hook)</text><text x="265.0" y="70.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">(B·4, N_s, 3 × 768)</text><rect x="380" y="30" width="160" height="56" rx="8" fill="#dcfce7" stroke="#16a34a" stroke-width="1.6"/><text x="460.0" y="54.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">chia q, k, v</text><text x="460.0" y="70.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">TB theo 4 vị trí</text><rect x="565" y="30" width="230" height="56" rx="8" fill="#dcfce7" stroke="#16a34a" stroke-width="1.6"/><text x="680.0" y="54.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">q̂, k̂, v̂ của student</text><text x="680.0" y="70.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">(B, N_s, 768), N_s theo khối</text><path d="M150 58 L175 58" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M355 58 L380 58" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M540 58 L565 58" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="10" y="270" width="140" height="56" rx="8" fill="#dbeafe" stroke="#2563eb" stroke-width="1.6" stroke-dasharray="6 4"/><text x="80.0" y="294.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">BEATs lớp i'</text><text x="80.0" y="310.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">(đóng băng)</text><rect x="175" y="270" width="180" height="56" rx="8" fill="#dbeafe" stroke="#2563eb" stroke-width="1.6"/><text x="265.0" y="294.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">q/k/v_proj (hook)</text><text x="265.0" y="310.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">(B, 192, 768) mỗi loại</text><rect x="380" y="270" width="160" height="56" rx="8" fill="#dbeafe" stroke="#2563eb" stroke-width="1.6"/><text x="460.0" y="294.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">pool trung bình</text><text x="460.0" y="310.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">8×24 → lưới khối</text><rect x="565" y="270" width="230" height="56" rx="8" fill="#dbeafe" stroke="#2563eb" stroke-width="1.6"/><text x="680.0" y="294.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">q, k, v của teacher</text><text x="680.0" y="310.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">(B, N_s, 768)</text><path d="M150 298 L175 298" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M355 298 L380 298" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M540 298 L565 298" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="500" y="150" width="170" height="62" rx="8" fill="#ffedd5" stroke="#ea580c" stroke-width="1.6"/><text x="585.0" y="170.0" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">L_cos</text><text x="585.0" y="185.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">mean(1 − cos(x̂, x))</text><text x="585.0" y="201.0" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">x ∈ {q, k, v}, từng token</text><rect x="720" y="150" width="220" height="62" rx="8" fill="#ffedd5" stroke="#ea580c" stroke-width="1.6"/><text x="830.0" y="170.0" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">L_rel</text><text x="830.0" y="185.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">KL(R_t ‖ R_s)</text><text x="830.0" y="201.0" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">R = softmax(x_h x_hᵀ/√64), 12 head</text><path d="M610 86 L610 150" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M760 86 L760 150" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M610 270 L610 212" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M760 270 L760 212" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><text x="20" y="150" font-family="Segoe UI, Arial, sans-serif" font-size="12" font-weight="600" text-anchor="start" fill="#374151">Ánh xạ i ↔ i' (cùng thứ tự):</text><text x="20" y="168" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" text-anchor="start" fill="#374151">khối 1: lớp 1-2 ↔ BEATs 1-2 (lưới 8×25)</text><text x="20" y="184" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" text-anchor="start" fill="#374151">khối 2: lớp 1-6 ↔ BEATs 3-8 (lưới 4×13)</text><text x="20" y="200" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" text-anchor="start" fill="#374151">khối 3: lớp 1-4 ↔ BEATs 9-12 (lưới 2×7)</text><text x="20" y="224" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" text-anchor="start" fill="#374151">Cùng d = 768 và 12 head nên không cần adapter.</text><text x="500" y="360" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" text-anchor="middle" fill="#374151">L_qkv = trung bình qua 12 lớp của (L_cos + REL_WEIGHT · L_rel). Cosine không phụ thuộc thang đo; KL ép cấu trúc attention giống teacher.</text></svg>"/></p>

    <p align="center"><em>Hình 4. q/k/v của từng lớp student so với lớp BEATs tương ứng bằng cosine và KL quan hệ (không cần adapter).</em></p>
    """)
    return


@app.cell(hide_code=True)
def _(mo):
    mo.md(r"""
    <p align="center"><img alt="CRD" src="data:image/svg+xml;base64,<svg xmlns="http://www.w3.org/2000/svg" width="960" height="400" viewBox="0 0 960 400"><title>CRD với memory bank</title><defs><marker id="arr" viewBox="0 0 10 10" refX="9" refY="5" markerWidth="7" markerHeight="7" orient="auto-start-reverse"><path d="M0 0 L10 5 L0 10 z" fill="#4b5563"/></marker></defs><rect width="960" height="400" fill="#ffffff"/><rect x="10" y="8" width="16" height="12" rx="3" fill="#dcfce7" stroke="#16a34a" stroke-width="1.4"/><text x="32" y="18.5" font-family="Segoe UI, Arial, sans-serif" font-size="11" font-weight="400" text-anchor="start" fill="#374151">Student</text><rect x="160" y="8" width="16" height="12" rx="3" fill="#dbeafe" stroke="#2563eb" stroke-width="1.4"/><text x="182" y="18.5" font-family="Segoe UI, Arial, sans-serif" font-size="11" font-weight="400" text-anchor="start" fill="#374151">Teacher</text><rect x="310" y="8" width="16" height="12" rx="3" fill="#ffedd5" stroke="#ea580c" stroke-width="1.4"/><text x="332" y="18.5" font-family="Segoe UI, Arial, sans-serif" font-size="11" font-weight="400" text-anchor="start" fill="#374151">Loss</text><rect x="460" y="8" width="16" height="12" rx="3" fill="#f3f4f6" stroke="#6b7280" stroke-width="1.4"/><text x="482" y="18.5" font-family="Segoe UI, Arial, sans-serif" font-size="11" font-weight="400" text-anchor="start" fill="#374151">Memory bank</text><rect x="10" y="40" width="110" height="56" rx="8" fill="#dcfce7" stroke="#16a34a" stroke-width="1.6"/><text x="65.0" y="64.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">Embedding</text><text x="65.0" y="80.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">student (B, 640)</text><rect x="150" y="40" width="110" height="56" rx="8" fill="#dcfce7" stroke="#16a34a" stroke-width="1.6"/><text x="205.0" y="64.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">Linear 640→128</text><text x="205.0" y="80.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">student head</text><rect x="290" y="40" width="110" height="56" rx="8" fill="#dcfce7" stroke="#16a34a" stroke-width="1.6"/><text x="345.0" y="64.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">L2-normalize</text><text x="345.0" y="80.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151"></text><rect x="430" y="40" width="60" height="56" rx="8" fill="#dcfce7" stroke="#16a34a" stroke-width="1.6"/><text x="460.0" y="72.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">z_s</text><rect x="10" y="260" width="110" height="56" rx="8" fill="#dbeafe" stroke="#2563eb" stroke-width="1.6"/><text x="65.0" y="284.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">Embedding</text><text x="65.0" y="300.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">teacher (B, 768)</text><rect x="150" y="260" width="110" height="56" rx="8" fill="#dbeafe" stroke="#2563eb" stroke-width="1.6"/><text x="205.0" y="284.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">Linear 768→128</text><text x="205.0" y="300.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">teacher head</text><rect x="290" y="260" width="110" height="56" rx="8" fill="#dbeafe" stroke="#2563eb" stroke-width="1.6"/><text x="345.0" y="284.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">L2-normalize</text><text x="345.0" y="300.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151"></text><rect x="430" y="260" width="60" height="56" rx="8" fill="#dbeafe" stroke="#2563eb" stroke-width="1.6"/><text x="460.0" y="292.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">z_t</text><path d="M120 68 L150 68" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M260 68 L290 68" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M400 68 L430 68" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M120 288 L150 288" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M260 288 L290 288" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M400 288 L430 288" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><rect x="560" y="110" width="170" height="50" rx="8" fill="#f3f4f6" stroke="#6b7280" stroke-width="1.6"/><text x="645.0" y="131.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">bank_teacher</text><text x="645.0" y="147.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">N × 128</text><rect x="560" y="200" width="170" height="50" rx="8" fill="#f3f4f6" stroke="#6b7280" stroke-width="1.6"/><text x="645.0" y="221.75" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">bank_student</text><text x="645.0" y="237.25" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">N × 128</text><rect x="780" y="40" width="170" height="76" rx="8" fill="#ffedd5" stroke="#ea580c" stroke-width="1.6"/><text x="865.0" y="67.0" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">InfoNCE (anchor z_s)</text><text x="865.0" y="82.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">dương: z_t cùng mẫu</text><text x="865.0" y="98.0" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">âm: K=4096 từ bank_teacher</text><rect x="780" y="240" width="170" height="76" rx="8" fill="#ffedd5" stroke="#ea580c" stroke-width="1.6"/><text x="865.0" y="267.0" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="12.5" font-weight="600" fill="#111827">InfoNCE (anchor z_t)</text><text x="865.0" y="282.5" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">dương: z_s cùng mẫu</text><text x="865.0" y="298.0" text-anchor="middle" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" fill="#374151">âm: K=4096 từ bank_student</text><path d="M490 68 L780 68" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M490 288 L780 288" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M730 125 L755 125 L755 100 L780 100" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M730 225 L755 225 L755 260 L780 260" fill="none" stroke="#4b5563" stroke-width="1.6" marker-end="url(#arr)"/><path d="M445 96 L445 225 L560 225" fill="none" stroke="#4b5563" stroke-width="1.6" stroke-dasharray="5 4" marker-end="url(#arr)"/><path d="M475 260 L475 135 L560 135" fill="none" stroke="#4b5563" stroke-width="1.6" stroke-dasharray="5 4" marker-end="url(#arr)"/><text x="500" y="184" font-family="Segoe UI, Arial, sans-serif" font-size="11" font-weight="400" text-anchor="start" fill="#374151">cập nhật bank (momentum 0.5)</text><text x="480" y="372" font-family="Segoe UI, Arial, sans-serif" font-size="11.5" font-weight="400" text-anchor="middle" fill="#374151">L_crd = InfoNCE(z_s) + InfoNCE(z_t), τ = 0.07. Negative cùng lớp hoặc cùng chỉ số mẫu bị mask −∞ (tránh false negative).</text></svg>"/></p>

    <p align="center"><em>Hình 5. CRD: hai head chiếu, memory bank hai view và InfoNCE đối xứng.</em></p>
    """)
    return


@app.cell
def _(F, Tensor, math, nn, torch):
    # (5) Pool q/k/v teacher về lưới student, loss q/k/v, loss CRD
    def pool_teacher(qkv: Tensor, grid_teacher: tuple[int, int], grid_student: tuple[int, int]) -> Tensor:
        """(3, B, N_t, D), token BEATs theo thứ tự (thời gian, tần số) -> (3, B, N_s, D) trên lưới student, thứ tự (tần số, thời gian)."""
        three, batch, tokens, dim = qkv.shape
        freq, time = grid_teacher
        x = qkv.reshape(three * batch, time, freq, dim).permute(0, 3, 2, 1)  # (3B, D, F, T)
        if (freq, time) != tuple(grid_student):
            x = F.adaptive_avg_pool2d(x, grid_student)
        return x.permute(0, 2, 3, 1).reshape(three, batch, -1, dim)


    def relation(x: Tensor, heads: int) -> Tensor:
        """(B, N, D) -> softmax(x_h x_h^T / sqrt(d)) theo từng head, (B*H*N, N)."""
        batch, tokens, dim = x.shape
        x = x.view(batch, tokens, heads, dim // heads).transpose(1, 2)
        return (x @ x.transpose(-2, -1) / math.sqrt(dim // heads)).reshape(-1, tokens)


    class QKVLoss(nn.Module):
        def __init__(self, heads: int = 12, rel_weight: float = 1.0) -> None:
            super().__init__()
            self.heads, self.rel_weight = heads, rel_weight

        def forward(self, student_qkv: Tensor, teacher_qkv: Tensor) -> tuple[Tensor, Tensor]:
            """Cả hai (3, B, N, D). Trả (cosine, KL quan hệ), mỗi cái trung bình trên q, k, v."""
            cosine, kl = student_qkv.new_zeros(()), student_qkv.new_zeros(())
            for s, t in zip(student_qkv, teacher_qkv):
                cosine = cosine + (1.0 - F.cosine_similarity(s, t, dim=-1)).mean()
                if self.rel_weight > 0:
                    kl = kl + F.kl_div(F.log_softmax(relation(s, self.heads), dim=-1),
                                       F.softmax(relation(t, self.heads), dim=-1), reduction="batchmean")
            return cosine / 3, kl / 3


    class CRDLoss(nn.Module):
        """Contrastive Representation Distillation với memory bank cho hai view, đối xứng teacher <-> student."""

        def __init__(self, student_dim: int, teacher_dim: int, num_samples: int, embed_dim: int, negatives: int,
                     temperature: float, momentum: float) -> None:
            super().__init__()
            self.embed_student = nn.Linear(student_dim, embed_dim)
            self.embed_teacher = nn.Linear(teacher_dim, embed_dim)
            self.negatives, self.temperature, self.momentum = negatives, temperature, momentum
            self.register_buffer("bank_student", F.normalize(torch.randn(num_samples, embed_dim), dim=1))
            self.register_buffer("bank_teacher", F.normalize(torch.randn(num_samples, embed_dim), dim=1))
            self.register_buffer("bank_labels", torch.full((num_samples,), -1, dtype=torch.long))

        def _nce(self, anchor: Tensor, positive: Tensor, bank: Tensor, negative_index: Tensor, index: Tensor, labels: Tensor) -> Tensor:
            positive_logit = (anchor * positive).sum(dim=1, keepdim=True)
            negative_logit = torch.einsum("be,bke->bk", anchor, bank[negative_index])
            invalid = (self.bank_labels[negative_index] == labels[:, None]) | (negative_index == index[:, None])
            negative_logit = negative_logit.masked_fill(invalid, float("-inf"))
            logits = torch.cat([positive_logit, negative_logit], dim=1) / self.temperature
            return F.cross_entropy(logits, torch.zeros(len(anchor), dtype=torch.long, device=anchor.device))

        def forward(self, student_embedding: Tensor, teacher_embedding: Tensor, index: Tensor, labels: Tensor) -> Tensor:
            zs = F.normalize(self.embed_student(student_embedding), dim=1)
            zt = F.normalize(self.embed_teacher(teacher_embedding), dim=1)
            negative_index = torch.randint(0, self.bank_student.shape[0], (len(index), self.negatives), device=index.device)
            loss = (self._nce(zs, zt, self.bank_teacher, negative_index, index, labels)
                    + self._nce(zt, zs, self.bank_student, negative_index, index, labels))
            with torch.no_grad():
                for bank, z in ((self.bank_student, zs), (self.bank_teacher, zt)):
                    bank[index] = F.normalize(self.momentum * bank[index] + (1.0 - self.momentum) * z.detach(), dim=1)
                self.bank_labels[index] = labels
            return loss


    def resolve_groups(groups, class_names: list[str]) -> list[Tensor]:
        """Tên ngắn -> chỉ số lớp. Khớp tên đầy đủ trước, rồi tiền tố (không phân biệt hoa thường); thiếu, mơ hồ hoặc trùng giữa hai nhóm thì báo lỗi."""
        resolved, used = [], set()
        for group in groups:
            indices = []
            for short in group:
                key = short.lower()
                hits = [i for i, c in enumerate(class_names) if c.lower() == key] or [i for i, c in enumerate(class_names) if c.lower().startswith(key)]
                if len(hits) != 1 or hits[0] in used:
                    raise ValueError(f"hard-negative: '{short}' khớp {[class_names[i] for i in hits]} (đã dùng: {hits[0] in used if hits else False})")
                used.add(hits[0])
                indices.append(hits[0])
            resolved.append(torch.tensor(indices, dtype=torch.long))
        return resolved


    def hard_negative_loss(logits: Tensor, targets: Tensor, groups: list[Tensor]) -> Tensor:
        """CE giới hạn trong từng nhóm lớp dễ nhầm: softmax chỉ trên logit của nhóm, nên các lớp trong nhóm phải tách nhau (hard negative) mà không bị lớp ngoài nhóm làm loãng.

        targets: chỉ số lớp (B,) hoặc nhãn mềm (B, C) sau mixup. Mẫu có phần khối lượng nhãn nằm trong nhóm được tính với trọng số bằng phần đó,
        nhãn trong nhóm được chuẩn hoá lại. Không có mẫu nào thuộc nhóm thì loss bằng 0. Chia cho B để cùng thang với CE."""
        soft = targets if targets.dtype.is_floating_point else F.one_hot(targets, logits.shape[1]).float()
        total = logits.new_zeros(())
        for group in groups:
            group = group.to(logits.device)
            mass = soft[:, group].sum(dim=1)
            inside = soft[:, group] / mass.clamp_min(1e-8)[:, None]
            nll = -(inside * F.log_softmax(logits[:, group].float(), dim=1)).sum(dim=1)
            total = total + (mass * nll).sum()
        return total / len(logits)


    return CRDLoss, QKVLoss, hard_negative_loss, pool_teacher, resolve_groups


@app.cell(hide_code=True)
def _(mo):
    mo.md(r"""
    ## Hard-negative theo nhóm lớp dễ nhầm (L_hn)

    Ma trận nhầm lẫn của student trên validation (checkpoint tốt nhất, epoch 27, macro recall 0,3946) cho thấy lỗi tập trung ở các lớp có âm sắc hoặc tính chất gần nhau, chứ không chỉ do thiên lệch prior:

    | Nhóm (`HN_GROUPS`, cell 1) | Cặp nhầm điển hình trên val |
    | --- | --- |
    | Saxophone, Clarinet, Trumpet, Flute, Harmonica, Violin | Saxophone → Clarinet 32%, Saxophone → Trumpet 18%, Trumpet → Harmonica 17%, Clarinet → Flute 16% |
    | Glockenspiel, Chime, Electric piano, Acoustic guitar, Telephone | Chime → Telephone 23%, Glockenspiel → Electric piano 17%, Acoustic guitar → Electric piano 17% |
    | Knock, Gunshot, Shatter, Fireworks | Knock, Shatter, Fireworks → Gunshot 16-17% |
    | Scissors, Tearing, Writing, Keys jangling, Computer keyboard | Scissors ↔ Tearing, Writing → Scissors 16% |
    | Microwave oven, Gong, Bus | Microwave oven → Gong 22%, → Bus 14% |
    | Fart, Meow | Fart → Meow 14% |

    Vì các nhóm được chọn từ ma trận nhầm lẫn trên validation, phần cải thiện trên chính các lớp này một phần là do chọn nhóm theo validation; số liệu test mới là phép đo độc lập.

    **Loss.** Với mỗi nhóm g, softmax chỉ trên logit của các lớp trong g, nên các lớp trong nhóm phải tách nhau mà không bị lớp ngoài nhóm làm loãng:

    `L_hn = (1/B) · Σ_g Σ_i m_i^g · CE( softmax(z_i[g]), ỹ_i[g] )`, với `m_i^g` là khối lượng nhãn của mẫu i nằm trong nhóm g và `ỹ_i[g]` là nhãn đã chuẩn hoá lại trong nhóm.

    Nhãn mềm sau mixup được xử lý đúng (phần khối lượng nằm ngoài nhóm không bị tính), mẫu không thuộc nhóm nào cho loss bằng 0 và gradient chỉ rơi vào logit của lớp trong nhóm. Mỗi lớp thuộc nhiều nhất một nhóm; tên lớp được khớp với tên đầy đủ hoặc tiền tố trong dataset và báo lỗi nếu thiếu hoặc mơ hồ (`resolve_groups`). L_hn không dùng teacher và không nhân hệ số KD, nên bật `hn` trong `RUNS` là một thí nghiệm độc lập với ablation ba loss KD.

    Đây là hướng theo **biểu diễn**: hiệu chỉnh bias không khắc phục được các cặp nhầm này (xem mục hiệu chỉnh ở cuối notebook).
    """)
    return


@app.cell
def _(Path, ROOT, tqdm):
    # (5b) Tải dataset mixture-36l từ Kaggle (nếu chưa có) và kiểm tra đủ tệp. Token đọc từ KAGGLE_ACCESS_TOKEN, không ghi vào notebook.
    import csv
    import os
    import time

    from scripts import download_dataset as dl
    from scripts.load_dataset import MIXTURE_KEY

    DOWNLOAD_ROOT = ROOT / "datasets"


    def ensure_mixture36(download_root: Path) -> Path:
        print(f"[1/3] tìm {MIXTURE_KEY} (env, url.yaml), nếu thiếu sẽ tải từ Kaggle vào {download_root}")
        if not os.environ.get(dl.TOKEN_ENV):
            print(f"      chưa đặt {dl.TOKEN_ENV}: chỉ dùng được dataset đã có trên máy")
        started = time.perf_counter()
        root = dl.ensure_dataset(MIXTURE_KEY, download_root)  # thanh tqdm: byte khi tải, tệp khi giải nén
        print(f"[2/3] dataset tại {root} ({time.perf_counter() - started:.0f}s)")
        print("[3/3] kiểm tra tệp mixture và noise theo manifest")
        for split in ("train", "validation", "test"):
            with open(root / split / "manifest.csv", encoding="utf-8-sig", newline="") as f:
                rows = list(csv.DictReader(f))
            missing = sum(not (root / row[key]).is_file() for row in tqdm(rows, desc=split, unit="mẫu") for key in ("mixture_path", "noise_path"))
            print(f"      {split}: {len(rows)} mẫu, thiếu {missing} tệp")
            if missing:
                raise FileNotFoundError(f"{split}: thiếu {missing} tệp, xoá thư mục {root} rồi tải lại")
        return root


    DATASET_ROOT = ensure_mixture36(DOWNLOAD_ROOT)
    return DATASET_ROOT, time


@app.cell
def _(
    Dataset,
    F,
    NHAT_CACHE_DIR,
    NUM_CLASSES,
    Path,
    RUN_TRAINING,
    Subset,
    Tensor,
    USE_NHAT_CACHE,
    np,
    torch,
):
    # (6) Dữ liệu: train có nhiễu thật và chỉ số mẫu (cho memory bank CRD)
    from scripts.finetune import SMOKE_BATCH, SMOKE_SAMPLES
    from scripts.load_dataset import Mixture36Dataset, build_dataloader, subsample

    DURATION = 4.0


    def nhat_path(split: str) -> Path:
        return NHAT_CACHE_DIR / f"{split}.npy"


    class NoiseCache:
        """n^ đã tính trước, đọc qua memmap; mỗi worker mở riêng."""

        def __init__(self, split: str) -> None:
            self.path, self._array = nhat_path(split), None

        def __getitem__(self, index: int) -> Tensor:
            if self._array is None:
                self._array = np.load(self.path, mmap_mode="r")
            return torch.from_numpy(np.array(self._array[index]))


    class IndexedDataset(Dataset):
        def __init__(self, base: Dataset, cache: NoiseCache | None = None) -> None:
            self.base, self.cache = base, cache

        def __len__(self) -> int:
            return len(self.base)

        def __getitem__(self, index: int) -> dict:
            item = dict(self.base[index])
            item["index"] = torch.tensor(index)
            if self.cache is not None:
                original = self.base.indices[index] if isinstance(self.base, Subset) else index
                item["noise_hat"] = self.cache[original]
            return item


    def with_fork(loader):
        """Kernel marimo mặc định tạo worker bằng spawn, không pickle được IndexedDataset (định nghĩa trong cell). Worker chỉ đọc tệp, không dùng CUDA, nên fork an toàn."""
        if loader.num_workers > 0:
            loader.multiprocessing_context = "fork"
        return loader


    def rms(x: Tensor) -> Tensor:
        return x.pow(2).mean(dim=-1, keepdim=True).sqrt().clamp_min(1e-8)


    def augment_pair(noise_hat: Tensor, noise: Tensor, labels: Tensor, aug: dict) -> tuple[Tensor, Tensor, Tensor, bool]:
        """Biến đổi NHẤT QUÁN cặp (n^ cho student, nhiễu thật cho teacher) để teacher vẫn cho nhãn và q/k/v đúng cho đầu vào của student.

        1. Đưa từng tín hiệu về RMS = 1. Năng lượng n^ lệch so với nhiễu thật tuỳ SNR và tuỳ clip (FRCRN giữ khoảng 95% ở -5 dB nhưng chỉ
           khoảng 65% ở 20 dB), nên nếu trộn thẳng thì cân bằng giữa hai nguồn ở student và ở teacher sẽ khác nhau. Gain đơn thuần thì không
           ảnh hưởng vì log-mel và teacher đều chuẩn hoá theo clip, nên không cần gain ngẫu nhiên riêng.
        2. Dịch vòng cùng một lượng cho cả hai tín hiệu.
        3. Mixup: trộn với cùng hệ số lam (lam >= 0.5, mẫu gốc luôn chiếm ưu thế) và cùng hoán vị; nhãn mềm lam*y_i + (1-lam)*y_j.
        """
        noise_hat, noise = noise_hat / rms(noise_hat), noise / rms(noise)
        batch, samples = noise.shape
        if aug["shift"]:
            start = torch.randint(0, samples, (batch, 1), device=noise.device)
            index = (torch.arange(samples, device=noise.device)[None, :] + start) % samples
            noise_hat, noise = noise_hat.gather(1, index), noise.gather(1, index)
        targets = F.one_hot(labels, NUM_CLASSES).float()
        mixed = bool(aug["mixup_prob"] > 0 and torch.rand(()) < aug["mixup_prob"])
        if mixed:
            lam = torch.distributions.Beta(aug["mixup_alpha"], aug["mixup_alpha"]).sample((batch, 1)).to(noise.device)
            lam = torch.maximum(lam, 1.0 - lam)
            order = torch.randperm(batch, device=noise.device)
            noise_hat = lam * noise_hat + (1.0 - lam) * noise_hat[order]
            noise = lam * noise + (1.0 - lam) * noise[order]
            targets = lam * targets + (1.0 - lam) * targets[order]
        return noise_hat, noise, targets, mixed


    def use_cache() -> bool:
        return USE_NHAT_CACHE and RUN_TRAINING  # smoke test không dùng cache


    def cache_ready(split: str) -> bool:
        return use_cache() and (NHAT_CACHE_DIR / f"{split}.done").is_file()  # test không cache: chỉ dùng một lần, FRCRN chạy trực tiếp


    def build_eval_loader(split: str, batch_size: int, workers: int, max_samples: int | None = None):
        base = subsample(Mixture36Dataset(split=split, duration=DURATION), max_samples)
        dataset = IndexedDataset(base, NoiseCache(split)) if cache_ready(split) else base
        return with_fork(build_dataloader(dataset, batch_size, False, workers))


    def build_loaders(train_config: dict, max_samples: int | None, workers: int) -> dict:
        base = subsample(Mixture36Dataset(split="train", duration=DURATION, load_noise=True), max_samples)
        train_ds = IndexedDataset(base, NoiseCache("train") if use_cache() else None)
        return {
            "train": with_fork(build_dataloader(train_ds, train_config["batch_size"], True, workers)),
            "validation": build_eval_loader("validation", train_config["eval_batch_size"], workers, max_samples),
            "num_train": len(train_ds),
        }

    return (
        DURATION,
        Mixture36Dataset,
        NoiseCache,
        SMOKE_BATCH,
        SMOKE_SAMPLES,
        augment_pair,
        build_dataloader,
        build_eval_loader,
        build_loaders,
        nhat_path,
        use_cache,
        with_fork,
    )


@app.cell
def _(
    DURATION,
    FRONTEND,
    Mixture36Dataset,
    NHAT_CACHE_DIR,
    NHAT_DRIVE_ZIP,
    NHAT_ZIP,
    NUM_WORKERS,
    NoiseCache,
    ROOT,
    Subset,
    UPLOAD_NHAT_TO_DRIVE,
    build_dataloader,
    device,
    fs,
    nhat_path,
    np,
    student,
    time,
    torch,
    tqdm,
    use_cache,
    with_fork,
):
    # (6b) Tính trước n^ = FRCRN(mixture) cho train và validation (test chỉ dùng một lần nên chạy FRCRN trực tiếp). Chạy một lần (khoảng 17 phút), lần sau bỏ qua nhờ tệp .done.
    import zipfile

    from numpy.lib.format import open_memmap


    def build_nhat_cache(splits=("train", "validation")) -> None:
        NHAT_CACHE_DIR.mkdir(parents=True, exist_ok=True)
        separator = student.separator.eval()
        for split in splits:
            done, lock = NHAT_CACHE_DIR / f"{split}.done", NHAT_CACHE_DIR / f"{split}.building"
            dataset = Mixture36Dataset(split=split, duration=DURATION)
            if done.is_file() and done.read_text() == str(len(dataset)):
                print(f"n^ cache {split}: đã có ({len(dataset)} clip), bỏ qua")
                continue
            if lock.is_file() and time.time() - lock.stat().st_mtime < 600:  # hai tiến trình cùng ghi một tệp đã làm hỏng cache một lần
                raise RuntimeError(f"đang có tiến trình khác tính n^ {split} ({lock}), đợi nó xong rồi chạy lại")
            lock.write_text("building")
            samples = int(DURATION * FRONTEND["sample_rate"])
            out = open_memmap(nhat_path(split), mode="w+", dtype=np.float32, shape=(len(dataset), samples))
            position, started = 0, time.perf_counter()
            for step, batch in enumerate(tqdm(with_fork(build_dataloader(dataset, 64, False, NUM_WORKERS)), desc=f"n^ {split}", unit="batch")):
                with torch.no_grad():
                    estimate = separator(batch["waveform"].to(device).float()).cpu().numpy()
                out[position:position + len(estimate)] = estimate
                position += len(estimate)
                if step % 20 == 0:
                    lock.touch()
            out.flush()
            done.write_text(str(len(dataset)))
            lock.unlink(missing_ok=True)
            print(f"n^ cache {split}: {len(dataset)} clip trong {time.perf_counter() - started:.0f}s -> {nhat_path(split)}")


    def empty_rows(split: str) -> np.ndarray:
        """Hàng toàn số 0 trong cache (chưa được ghi)."""
        array, rows = np.load(nhat_path(split), mmap_mode="r"), []
        for start in range(0, len(array), 512):
            energy = np.square(np.asarray(array[start:start + 512], dtype=np.float64)).sum(axis=1)
            rows.extend((start + np.nonzero(energy == 0)[0]).tolist())
        return np.array(rows, dtype=np.int64)


    def fix_empty_rows(split: str) -> None:
        rows = empty_rows(split)
        if not len(rows):
            print(f"n^ cache {split}: không có hàng trống")
            return
        print(f"n^ cache {split}: {len(rows)} hàng trống ({len(rows) / len(np.load(nhat_path(split), mmap_mode='r')):.1%}), tính lại riêng các hàng này")
        array = np.load(nhat_path(split), mmap_mode="r+")
        subset = Subset(Mixture36Dataset(split=split, duration=DURATION), rows.tolist())
        position = 0
        for batch in tqdm(with_fork(build_dataloader(subset, 64, False, NUM_WORKERS)), desc=f"n^ sửa {split}", unit="batch"):
            with torch.no_grad():
                estimate = student.separator.eval()(batch["waveform"].to(device).float()).cpu().numpy()
            array[rows[position:position + len(estimate)]] = estimate
            position += len(estimate)
        array.flush()
        assert not len(empty_rows(split)), f"n^ cache {split}: vẫn còn hàng trống sau khi sửa"


    def check_nhat_cache(count: int = 8) -> None:
        probe = Mixture36Dataset(split="train", duration=DURATION)
        waveform = torch.stack([probe[i]["waveform"] for i in range(count)]).to(device)
        with torch.no_grad():
            live = student.separator(waveform.float()).cpu()
        cached = torch.stack([NoiseCache("train")[i] for i in range(count)])
        error = float((live - cached).abs().max())
        snr = float(10 * torch.log10(live.pow(2).sum() / (live - cached).pow(2).sum().clamp_min(1e-20)))
        print(f"n^ cache: so với FRCRN chạy trực tiếp, sai lệch lớn nhất {error:.2e} (biên độ tối đa {float(live.abs().max()):.3f}), SNR giữa hai bản {snr:.1f} dB")
        # cuDNN TF32 không tất định và phụ thuộc cỡ batch (cùng batch: khoảng 90 dB, khác batch: khoảng 60 dB), nên so bằng SNR chứ không bằng sai số tuyệt đối
        assert snr > 40, "cache n^ không khớp FRCRN trực tiếp"


    def nhat_ready() -> bool:
        return all((NHAT_CACHE_DIR / f"{name}.done").is_file() for name in ("train", "validation"))


    def restore_nhat_from_drive() -> None:
        """Nếu thiếu cache trên máy: tải zip từ Drive rồi giải nén, thay cho việc tính lại bằng FRCRN."""
        if nhat_ready() or fs is None:
            return
        try:
            if not fs.exists(NHAT_DRIVE_ZIP):
                print("n^ cache: Drive chưa có bản lưu, sẽ tính bằng FRCRN")
                return
            print(f"n^ cache: tải {NHAT_DRIVE_ZIP} từ Drive (khoảng 8,6 GB)")
            started = time.perf_counter()
            fs.get_file(NHAT_DRIVE_ZIP, str(NHAT_ZIP))
            with zipfile.ZipFile(NHAT_ZIP) as archive:
                archive.extractall(ROOT)  # các mục có dạng cache/nhat/*.npy
            print(f"n^ cache: đã tải và giải nén trong {time.perf_counter() - started:.0f}s")
        except Exception as error:
            print("drive: không khôi phục được cache n^, sẽ tính bằng FRCRN:", repr(error))


    def save_nhat_to_drive() -> None:
        """Đẩy zip cache lên Drive một lần (bỏ qua nếu Drive đã có). Thư mục tạo một lần, tránh makedirs lặp lại sinh thư mục trùng tên."""
        if fs is None or not UPLOAD_NHAT_TO_DRIVE or not nhat_ready():
            return
        try:
            if fs.exists(NHAT_DRIVE_ZIP):
                print("n^ cache: Drive đã có bản lưu, bỏ qua upload")
                return
            if not NHAT_ZIP.is_file():
                print("n^ cache: nén thành", NHAT_ZIP)
                partial = NHAT_ZIP.with_name(NHAT_ZIP.name + ".part")
                with zipfile.ZipFile(partial, "w", zipfile.ZIP_DEFLATED, compresslevel=1, allowZip64=True) as archive:
                    for path in sorted(NHAT_CACHE_DIR.glob("*")):
                        archive.write(path, path.relative_to(ROOT).as_posix())
                partial.replace(NHAT_ZIP)
            fs.makedirs(NHAT_DRIVE_ZIP.rsplit("/", 1)[0], exist_ok=True)
            print(f"n^ cache: upload {NHAT_ZIP.stat().st_size / 1e9:.1f} GB lên Drive ({NHAT_DRIVE_ZIP})")
            started = time.perf_counter()
            fs.put_file(str(NHAT_ZIP), NHAT_DRIVE_ZIP)
            print(f"n^ cache: upload xong sau {time.perf_counter() - started:.0f}s")
        except Exception as error:
            print("drive: upload cache n^ lỗi (huấn luyện vẫn tiếp tục):", repr(error))


    if use_cache():
        restore_nhat_from_drive()
        build_nhat_cache()
        for split_name in ("train", "validation"):
            fix_empty_rows(split_name)  # chạy lại lần sau vẫn an toàn: không có hàng trống thì bỏ qua (quét khoảng 10 giây)
        check_nhat_cache()
        save_nhat_to_drive()
    else:
        print("n^ cache: tắt (USE_NHAT_CACHE=False hoặc smoke test), FRCRN chạy trực tiếp mỗi bước")
    return


@app.cell(hide_code=True)
def _(mo):
    mo.md(r"""
    ## Kiểm tra teacher (tuỳ chọn, rẻ)

    Teacher phải phân loại nhiễu thật đúng cỡ `clean_val_accuracy` trong checkpoint (fold 0: 0.74). Nếu thấp hơn nhiều thì đường vào (RMS, fbank) lệch so với lúc fine-tune, nên dừng lại trước khi huấn luyện student.
    """)
    return


@app.cell
def _(DURATION, Mixture36Dataset, build_dataloader, device, logger, teacher):
    # (7) Độ chính xác của teacher trên nhiễu thật của tập validation
    def check_teacher(max_batches: int = 20, batch_size: int = 32) -> float:
        loader = build_dataloader(Mixture36Dataset(split="validation", duration=DURATION, load_noise=True), batch_size, False, 0)
        correct = seen = 0
        for step, batch in enumerate(loader):
            if step >= max_batches:
                break
            output = teacher(batch["noise"].to(device))
            correct += (output.logits.argmax(1).cpu() == batch["target"].argmax(1)).sum().item()
            seen += len(batch["target"])
        logger.info("teacher: accuracy trên nhiễu thật (validation, %d mẫu) = %.4f", seen, correct / seen)
        return correct / seen

    return


@app.cell(hide_code=True)
def _(mo):
    mo.md(r"""
    ## Huấn luyện và đánh giá

    **Vì sao có hàng đợi thí nghiệm.** Thí nghiệm tham chiếu (cả ba loss KD, 50 epoch, tên không có hậu tố) dừng quanh epoch 33: macro_acc trên validation đi ngang ở khoảng 0,39 từ epoch ~22 (tốt nhất 0,3946 ở epoch 27), train acc 0,75 so với val 0,39. Teacher fold 0 chạy trên chính n̂ đạt 0,6633, nên đầu vào không phải trần và cần xem thành phần KD nào thực sự giúp. Cell (9) chạy lần lượt các nhánh trong `RUNS` (cell 1) rồi in bảng so sánh.

    | Nhánh | Khác tham chiếu | Câu hỏi |
    | --- | --- | --- |
    | `eskd` (tuỳ chọn, mặc định tắt) | khởi tạo từ `best_state` tham chiếu, CRD tắt, KD (q/k/v và logit) giảm tuyến tính 1 → 0 trong 8 epoch, lr 1e-5, 10 epoch; epoch 0 đo điểm xuất phát nên best không thể tệ hơn; từ khi KD hết thì không gọi teacher | bỏ dần teacher có cải thiện val không |
    | `no-crd` | tắt L_crd | CRD có giúp không |
    | `no-qkv` | tắt L_qkv | q/k/v có giúp không |
    | `ce` | tắt cả ba loss KD | KD có giúp so với CE thuần không |
    | `hn` | bật L_hn (λ = 1) | hard-negative có tách được các cặp nhầm không |

    `eskd` là nhánh duy nhất không huấn luyện từ đầu (nó khởi tạo từ `best_state` của tham chiếu), nên được chú thích trong `RUNS`; bỏ chú thích để dùng. Có thể thêm nhánh `T2` (nhiệt độ 2) và `qkv9-12` (chỉ q/k/v của 4 lớp cuối) bằng cách bỏ chú thích trong cell 1.

    **Giữ phép so sánh công bằng.**

    - Nhánh ablation dừng ở `max_epochs = 15` nhưng **không** đổi `TRAIN["epochs"]`, nên lịch warm-up và lr giống tham chiếu; cùng seed nên so cặp được. Bảng so sánh lấy đường cong của tham chiếu từ `history` trong `resume.pt` của nó và so ở cùng ngân sách epoch (`ref_same_budget`) và với tốt nhất toàn bộ (`ref_overall`).
    - Val có 6.480 mẫu; sai số chuẩn của macro_acc khoảng 0,006 và dao động giữa các epoch khoảng ±0,005, nên chênh dưới ~0,02 giữa hai nhánh một seed chưa đáng tin.
    - Các nhánh ablation đặt `eval_test = False`: **không động tới test**. Test chỉ chạy một lần cho cấu hình được chọn sau cùng (đặt `eval_test = True`).
    - Tên nhánh = tên cơ sở + `-<tag>-<RUN_TAG>` nên không đụng `resume.pt` và thư mục Drive của tham chiếu; mỗi nhánh có `resume.pt` riêng nên Run all lại sẽ nối tiếp. Các khoá mới chỉ vào cờ so khớp khi khác mặc định, nên `resume.pt` của tham chiếu vẫn nối tiếp được.

    **Thời gian.** Khoảng 3 phút mỗi epoch có teacher (gồm upload Drive); hàng đợi mặc định 4 × 15 = 60 epoch, khoảng 3 giờ trên GPU sandbox. Bớt dòng trong `RUNS` để rút ngắn.
    """)
    return


@app.cell
def _(
    AUG,
    AdamW,
    CRDLoss,
    DRIVE_DIR,
    DURATION,
    EMBED_CHANNELS,
    F,
    FRCRNMobileViT,
    FRCRN_PATH,
    GRID,
    HN_GROUPS,
    KD,
    Mixture36Dataset,
    NUM_CLASSES,
    NUM_WORKERS,
    Path,
    QKVLoss,
    ROOT,
    RUN_TAG,
    RUN_TRAINING,
    SMOKE_BATCH,
    SMOKE_SAMPLES,
    SNR_LEVELS,
    STUDENT,
    TEACHER_LAYERS,
    TRAIN,
    Tensor,
    USE_AUG,
    USE_CRD,
    USE_LOGIT,
    USE_QKV,
    augment_pair,
    build_eval_loader,
    build_loaders,
    build_student,
    device,
    fs,
    hard_negative_loss,
    logger,
    nn,
    np,
    pd,
    pool_teacher,
    resolve_groups,
    run,
    set_seed,
    teacher,
    time,
    torch,
    tqdm,
    use_cache,
):
    # (8) Vòng huấn luyện + đánh giá 9 chỉ số theo từng SNR
    from src.metrics import ClassificationMetrics  # noqa: F401  (snr_scores dùng bên dưới)
    from torch.optim.lr_scheduler import ReduceLROnPlateau
    from src.train.reviewkd_trainer import NINE_METRICS, snr_scores


    class DrivePut:
        """Upload một tệp lên Drive, ghi đè nếu đã có. Thư mục chỉ tạo MỘT lần (ensure): makedirs lặp lại ở mỗi lần upload đã sinh thư mục trùng tên
        trên Drive và gây MultipleFilesError. Lỗi mạng chỉ ghi cảnh báo, không làm gãy huấn luyện."""

        ready: set[str] = set()

        def __init__(self, fs, remote_dir: str, filename: str, logger, attempts: int = 3) -> None:
            self.fs, self.remote_dir, self.filename, self.logger, self.attempts = fs, remote_dir.strip("/"), filename, logger, attempts

        @classmethod
        def ensure(cls, fs, remote_dir: str, logger) -> bool:
            remote_dir = remote_dir.strip("/")
            if remote_dir in cls.ready:
                return True
            try:
                fs.makedirs(remote_dir, exist_ok=True)
                cls.ready.add(remote_dir)
                return True
            except Exception as error:
                logger.warning("drive: không tạo được thư mục %s: %r", remote_dir, error)
                return False

        def __call__(self, local_path, epoch: int | None = None, score: float | None = None) -> None:
            if self.remote_dir not in self.ready:
                return  # thư mục chưa sẵn sàng thì bỏ qua, không thử tạo lại
            target = f"{self.remote_dir}/{self.filename}"
            for attempt in range(1, self.attempts + 1):
                try:
                    self.fs.put_file(str(local_path), target)
                    self.logger.info("drive backup: %s -> %s", Path(local_path).name, target)
                    return
                except Exception as error:
                    if attempt == self.attempts:
                        self.logger.warning("drive backup failed for %s: %r", local_path, error)
                    else:
                        time.sleep(5 * attempt)
    from src.metrics import _binary_ap, _binary_auc, confusion_matrix, top_confusions  # hàm nội bộ của repo


    def trainable_state(model: nn.Module) -> dict[str, Tensor]:
        """Trọng số cần lưu: backbone (net) và attention pooling (att, cla). Bỏ separator (FRCRN đóng băng, nạp từ pretrained).
        Trước đây chỉ lưu model.net nên thiếu att/cla: best.pt không phân loại được và resume làm mất lớp phân loại."""
        return {key: value.detach().cpu().clone() for key, value in model.state_dict().items() if not key.startswith("separator.")}


    def load_trainable_state(model: nn.Module, state: dict[str, Tensor]) -> None:
        result = model.load_state_dict(state, strict=False)
        problems = [key for key in result.missing_keys if not key.startswith("separator.")] + list(result.unexpected_keys)
        if problems:
            raise ValueError(f"trọng số không khớp mô hình (thiếu hoặc thừa): {problems[:6]}")


    def save_model(path: Path, model: nn.Module, **metadata) -> Path:
        path.parent.mkdir(parents=True, exist_ok=True)
        torch.save({"model": trainable_state(model), **metadata}, path)
        return path


    @torch.no_grad()
    def evaluate(model: FRCRNMobileViT, loader, desc: str = "evaluate") -> dict[str, float]:
        model.eval()
        probabilities, labels, snrs = [], [], []
        for batch in tqdm(loader, desc=desc, unit="batch", leave=False, dynamic_ncols=True):
            if "noise_hat" in batch:
                probabilities.append(model.predict_proba(noise_hat=batch["noise_hat"].to(device)).float().cpu())
            else:
                probabilities.append(model.predict_proba(batch["waveform"].to(device)).float().cpu())
            labels.append(batch["target"].argmax(dim=1))
            snrs.append(batch["snr_db"])
        return snr_scores(torch.cat(probabilities).numpy(), torch.cat(labels).numpy(), torch.cat(snrs).numpy(), NUM_CLASSES)


    def per_snr_table(scores: dict[str, float]) -> pd.DataFrame:
        rows = {f"{level}": [scores.get(f"{name}_snr_{level}", float("nan")) for name in NINE_METRICS] for level in SNR_LEVELS}
        rows["mean"] = [scores.get(f"{name}_snr_mean", float("nan")) for name in NINE_METRICS]
        return pd.DataFrame.from_dict(rows, orient="index", columns=NINE_METRICS).rename_axis("snr_db")


    @torch.no_grad()
    def analyze_predictions(model: nn.Module, loader, split: str, name: str, out_dir: Path, class_names: list[str]) -> list[Path]:
        """Dự đoán của mô hình tốt nhất: xác suất từng clip, ma trận nhầm lẫn, bảng theo từng lớp (recall, precision, AP, AUC, lớp hay bị nhầm thành, recall theo SNR)."""
        model.eval()
        probs, labels, snrs = [], [], []
        for batch in tqdm(loader, desc=f"{name} - dự đoán {split}", unit="batch", leave=False, dynamic_ncols=True):
            if "noise_hat" in batch:
                probs.append(model.predict_proba(noise_hat=batch["noise_hat"].to(device)).float().cpu())
            else:
                probs.append(model.predict_proba(batch["waveform"].to(device)).float().cpu())
            labels.append(batch["target"].argmax(dim=1))
            snrs.append(batch["snr_db"])
        P, y, snr = torch.cat(probs).numpy(), torch.cat(labels).numpy(), torch.cat(snrs).numpy()
        pred = P.argmax(axis=1)
        matrix = confusion_matrix(y, pred, NUM_CLASSES)
        out_dir.mkdir(parents=True, exist_ok=True)
        paths = [out_dir / f"predictions_{split}_{name}.npz", out_dir / f"confusion_{split}_{name}.csv", out_dir / f"per_class_{split}_{name}.csv"]
        np.savez_compressed(paths[0], probs=P.astype(np.float16), labels=y, snr_db=snr, class_names=np.array(class_names))
        pd.DataFrame(matrix, index=class_names, columns=class_names).to_csv(paths[1])
        rows = []
        for c in range(NUM_CLASSES):
            off_diagonal = matrix[c].copy()
            off_diagonal[c] = 0
            partner, total = int(off_diagonal.argmax()), max(int(matrix[c].sum()), 1)
            row = dict(label=class_names[c], clips=int(matrix[c].sum()), recall=matrix[c, c] / total, precision=matrix[c, c] / max(int(matrix[:, c].sum()), 1),
                       AP=_binary_ap((y == c).astype(np.int64), P[:, c]), AUC=_binary_auc((y == c).astype(np.int64), P[:, c]),
                       most_confused_as=class_names[partner], confused_rate=off_diagonal[partner] / total)
            for level in SNR_LEVELS:
                selected = (y == c) & (snr == level)
                row[f"recall_snr_{level}"] = float((pred[selected] == c).mean()) if selected.any() else float("nan")
            rows.append(row)
        table = pd.DataFrame(rows).sort_values("recall")
        table.to_csv(paths[2], index=False)
        logger.info("%s %s: 12 cặp nhầm nhiều nhất (thật -> đoán, tỉ lệ trên lớp thật)\n%s", name, split,
                    "\n".join(f"  {p.true_label} -> {p.predicted_label}: {p.rate:.0%} ({p.count} clip)" for p in top_confusions(matrix, class_names, 12)))
        logger.info("%s %s: 8 lớp yếu nhất theo recall\n%s", name, split, table.head(8)[["label", "recall", "precision", "AP", "most_confused_as", "confused_rate"]].round(3).to_string(index=False))
        return paths


    def kd_scale(epoch: int, warmup: int) -> float:
        return 1.0 if warmup == 0 else min(1.0, (epoch - 1) / warmup)


    DEFAULT_CFG = dict(tag="", qkv=None, crd=None, logit=None, T=None, qkv_layers=None, hn=0.0, init_from=None,
                       kd_decay_epochs=None, lr=None, warmup_ratio=None, max_epochs=None, eval_test=True)


    def resolve_cfg(cfg: dict | None) -> dict:
        """Gộp cấu hình một lần chạy với mặc định. qkv, crd, logit lấy từ cờ ở cell (1) nếu để None."""
        cfg = {**DEFAULT_CFG, **(cfg or {})}
        unknown = set(cfg) - set(DEFAULT_CFG)
        if unknown:
            raise KeyError(f"khoá không hợp lệ trong RUNS: {sorted(unknown)}, hợp lệ: {sorted(DEFAULT_CFG)}")
        for key, default in (("qkv", USE_QKV), ("crd", USE_CRD), ("logit", USE_LOGIT)):
            cfg[key] = default if cfg[key] is None else cfg[key]
        return cfg


    def run_name(cfg: dict | None = None) -> str:
        """Tên thí nghiệm. Cấu hình tham chiếu (cfg rỗng) giữ nguyên tên cũ, mọi cấu hình khác có thêm `-<tag>-<RUN_TAG>` để không đụng resume.pt và thư mục Drive cũ."""
        cfg = resolve_cfg(cfg)
        base = "-".join(["mobilevit12", f"ffn{STUDENT['ffn_dim']}", f"lr{TRAIN['lr']:.0e}-do{round(TRAIN['dropout'] * 100)}-dp{round(TRAIN['drop_path'] * 100)}-wd{round(TRAIN['weight_decay'] * 100)}", "frcrn",
                         *([f"mx{round(AUG['mixup_prob'] * 100)}"] if USE_AUG else []), *(["qkv"] if cfg["qkv"] else []), *(["crd"] if cfg["crd"] else []), *(["logit"] if cfg["logit"] else []),
                         *([] if (cfg["qkv"] or cfg["crd"] or cfg["logit"]) else ["ce"])])
        return base if cfg == resolve_cfg(None) else f"{base}-{cfg['tag'] or 'x'}-{RUN_TAG}"


    def compare_runs(results: list[dict]) -> pd.DataFrame:
        """So từng thí nghiệm với thí nghiệm tham chiếu (cả ba loss KD) ở CÙNG ngân sách epoch; cùng seed nên so cặp được. Tham chiếu lấy từ history trong resume.pt."""
        path = ROOT / "output" / "resume" / run_name(None) / "resume.pt"
        curve = [r["val_macro_acc"] for r in torch.load(path, map_location="cpu", weights_only=False)["history"] if r["epoch"] > 0] if path.is_file() else []
        rows = []
        for r in results:
            budget = len(r["val_curve"])
            same = max(curve[:budget]) if curve else float("nan")
            overall = max(curve) if curve else float("nan")
            rows.append({"run": r["model"], "epochs": budget, "best_epoch": r["best_epoch"], "best_val": r["val_macro_acc"],
                         "ref_same_budget": same, "delta_same_budget": r["val_macro_acc"] - same,
                         "ref_overall": overall, "delta_overall": r["val_macro_acc"] - overall})
        return pd.DataFrame(rows).round(4)


    def run_experiment(name: str, cfg: dict | None = None) -> tuple[dict, pd.DataFrame | None]:
        cfg = resolve_cfg(cfg)
        use_qkv, use_crd, use_logit = cfg["qkv"], cfg["crd"], cfg["logit"]
        train_config, kd = dict(TRAIN), dict(KD)
        if cfg["T"] is not None:
            kd["logit_temperature"] = cfg["T"]
        if cfg["lr"] is not None:
            train_config["lr"] = cfg["lr"]
        if cfg["warmup_ratio"] is not None:
            train_config["warmup_ratio"] = cfg["warmup_ratio"]
        eval_test = RUN_TRAINING and cfg["eval_test"]  # test chỉ chạy cho cấu hình đã chọn, các nhánh ablation đặt eval_test=False
        class_names = Mixture36Dataset(split="validation", duration=DURATION).class_names
        hn_groups = resolve_groups(HN_GROUPS, class_names) if cfg["hn"] else []
        qkv_layers = [i for i in range(len(TEACHER_LAYERS)) if cfg["qkv_layers"] is None or (i + 1) in cfg["qkv_layers"]]  # chỉ số lớp (từ 0) có loss q/k/v
        max_samples, workers = None, NUM_WORKERS
        if not RUN_TRAINING:
            train_config.update(epochs=1, patience=1, batch_size=SMOKE_BATCH, eval_batch_size=SMOKE_BATCH)
            kd["warmup_epochs"] = 0
            max_samples, workers = SMOKE_SAMPLES, 0

        set_seed(train_config["seed"])
        loaders = build_loaders(train_config, max_samples, workers)
        model = build_student().to(device)
        qkv_loss = QKVLoss(heads=12, rel_weight=kd["rel_weight"]).to(device)
        crd = (CRDLoss(EMBED_CHANNELS, 768, loaders["num_train"], kd["crd_dim"], kd["crd_negatives"],
                       kd["crd_temperature"], kd["crd_momentum"]).to(device) if use_crd else None)

        trainable = [p for module in (model, crd) if module is not None for p in module.parameters() if p.requires_grad]
        optimizer = AdamW(trainable, lr=train_config["lr"], weight_decay=train_config["weight_decay"], betas=train_config["betas"])
        steps_per_epoch = len(loaders["train"])
        warmup_steps = max(int(train_config["epochs"] * steps_per_epoch * train_config["warmup_ratio"]), 1)  # warm-up tuyến tính theo bước
        plateau = ReduceLROnPlateau(optimizer, mode="max", factor=train_config["lr_factor"], patience=train_config["lr_patience"],
                                    threshold=train_config["lr_threshold"], threshold_mode="abs", min_lr=train_config["min_lr"])
        for group in optimizer.param_groups:
            group["lr"] = train_config["lr"] / warmup_steps  # bước đầu tiên của warm-up; nạp resume sẽ ghi đè bằng lr đã lưu
        logger.info("%s | student %.2fM | crd %.2fM | train %d mẫu", name,
                    sum(p.numel() for p in model.net.parameters()) / 1e6,
                    sum(p.numel() for p in crd.parameters()) / 1e6 if crd else 0.0, loaders["num_train"])

        history, best_score, best_epoch, best_state, stale, start_epoch = [], -float("inf"), 0, None, 0, 1
        flags = dict(qkv=use_qkv, crd=use_crd, logit=use_logit, layers=TEACHER_LAYERS, student=STUDENT, kd=kd,
                     reg=dict(dropout=TRAIN["dropout"], drop_path=TRAIN["drop_path"], wd=TRAIN["weight_decay"]),
                     aug=(AUG if USE_AUG else None),
                     opt=dict(lr=train_config["lr"], factor=TRAIN["lr_factor"], patience=TRAIN["lr_patience"], threshold=TRAIN["lr_threshold"],
                              min_lr=TRAIN["min_lr"], warmup=train_config["warmup_ratio"]), cache=use_cache(), fmt=2)
        # Núm mới chỉ vào flags khi khác mặc định, để resume.pt của cấu hình tham chiếu (không có các khoá này) vẫn khớp.
        extras = dict(T=cfg["T"], qkv_layers=cfg["qkv_layers"], hn=cfg["hn"] or None, init=cfg["init_from"], decay=cfg["kd_decay_epochs"])
        flags.update({key: value for key, value in extras.items() if value})
        resume_path = ROOT / "output" / "resume" / name / "resume.pt" if RUN_TRAINING else None  # thư mục cố định để Run all nối tiếp được
        remote_dir = f"{DRIVE_DIR}/{name}"
        use_drive = fs is not None and RUN_TRAINING
        drive_ready = use_drive and DrivePut.ensure(fs, remote_dir, logger)  # tạo thư mục Drive một lần duy nhất
        drive_best = DrivePut(fs, remote_dir, "best.pt", logger) if drive_ready else None
        drive_resume = DrivePut(fs, remote_dir, "resume.pt", logger) if drive_ready else None
        drive_history = DrivePut(fs, remote_dir, f"history_{name}.csv", logger) if drive_ready else None
        drive_logfile = DrivePut(fs, remote_dir, run.log_file.name, logger) if drive_ready else None
        if use_drive and not resume_path.is_file():  # local mất (sandbox mới) thì lấy resume.pt từ Drive
            try:
                if fs.exists(f"{remote_dir}/resume.pt"):
                    resume_path.parent.mkdir(parents=True, exist_ok=True)
                    fs.get_file(f"{remote_dir}/resume.pt", str(resume_path))
                    logger.info("drive: khôi phục resume.pt từ %s", remote_dir)
            except Exception as error:
                logger.warning("drive: không khôi phục được resume.pt: %r", error)
        if resume_path is not None and resume_path.is_file():
            state = torch.load(resume_path, map_location="cpu", weights_only=False)
            if state["flags"] != flags:
                raise ValueError(f"{resume_path}: cấu hình khác lần chạy trước ({state['flags']} != {flags}), xoá file để chạy lại từ đầu")
            load_trainable_state(model, state["model"])
            if crd is not None:
                crd.load_state_dict(state["crd"])  # gồm cả memory bank
            optimizer.load_state_dict(state["optimizer"])
            plateau.load_state_dict(state["scheduler"])
            history, best_score, best_epoch, best_state, stale = state["history"], state["best_score"], state["best_epoch"], state["best_state"], state["stale"]
            start_epoch = state["epoch"] + 1
            set_seed(train_config["seed"] + start_epoch)
            logger.info("%s: nối tiếp từ epoch %d (best %.4f ở epoch %d, stale %d)", name, start_epoch, best_score, best_epoch, stale)
        elif cfg["init_from"]:  # ESKD: khởi tạo từ best_state của thí nghiệm tham chiếu, đo epoch 0 để best không thể tệ hơn điểm xuất phát
            source = ROOT / "output" / "resume" / run_name(None) / "resume.pt" if cfg["init_from"] == "reference" else Path(cfg["init_from"])
            init = torch.load(source, map_location="cpu", weights_only=False)
            load_trainable_state(model, init["best_state"])
            scores = evaluate(model, loaders["validation"], desc="epoch 0 - validation")
            best_score, best_epoch, best_state = scores["macro_acc"], 0, trainable_state(model)
            history.append({"epoch": 0, **{f"val_{k}": v for k, v in scores.items()}})
            logger.info("%s: khởi tạo từ best_state epoch %d của %s, val macro_acc %.4f", name, init["best_epoch"], source.parent.name, best_score)
        for epoch in range(start_epoch, train_config["epochs"] + 1):
            model.train()
            scale = max(0.0, 1.0 - (epoch - 1) / cfg["kd_decay_epochs"]) if cfg["kd_decay_epochs"] else kd_scale(epoch, kd["warmup_epochs"])
            sums = dict(loss=0.0, ce=0.0, cos=0.0, rel=0.0, crd=0.0, kl=0.0, hn=0.0, correct=0, seen=0)
            cos_layer_sum = None  # 1 - cos(q,k,v) của từng lớp, để thấy lớp nào học chậm
            for batch_index, batch in enumerate(tqdm(loaders["train"], desc=f"epoch {epoch}", unit="batch", leave=False, dynamic_ncols=True)):
                step_index = (epoch - 1) * steps_per_epoch + batch_index
                if step_index < warmup_steps:
                    for group in optimizer.param_groups:
                        group["lr"] = train_config["lr"] * (step_index + 1) / warmup_steps
                noise = batch["noise"].to(device)
                labels, index = batch["target"].argmax(dim=1).to(device), batch["index"].to(device)
                noise_hat, targets, mixed = (batch["noise_hat"].to(device) if "noise_hat" in batch else None), labels, False
                if USE_AUG and noise_hat is not None:
                    noise_hat, noise, targets, mixed = augment_pair(noise_hat, noise, labels, AUG)
                output = model(noise_hat=noise_hat) if noise_hat is not None else model(batch["waveform"].to(device))
                ce = F.cross_entropy(output.logits, targets, label_smoothing=train_config["label_smoothing"])
                loss, cos, rel, nce, kl, hn = ce, ce.new_zeros(()), ce.new_zeros(()), ce.new_zeros(()), ce.new_zeros(()), ce.new_zeros(())
                use_kd = (use_qkv or use_crd or use_logit) and not (cfg["kd_decay_epochs"] and scale <= 0)  # ESKD: hết giảm KD thì bỏ cả lượt teacher
                if use_kd:
                    teacher_output = teacher(noise)
                if use_qkv and use_kd:
                    pairs = [qkv_loss(output.qkv[i], pool_teacher(teacher_output.qkv[i], GRID, output.grids[i])) for i in qkv_layers]
                    cos_layers, rel_layers = torch.stack([p[0] for p in pairs]), torch.stack([p[1] for p in pairs])
                    cos, rel = cos_layers.mean(), rel_layers.mean()
                    step_layers = cos_layers.detach() * len(labels)
                    cos_layer_sum = step_layers if cos_layer_sum is None else cos_layer_sum + step_layers
                    loss = loss + scale * kd["qkv_weight"] * (cos + kd["rel_weight"] * rel)
                if use_crd and use_kd and not mixed:  # batch trộn không có chỉ số mẫu và nhãn đơn nên không cập nhật memory bank của CRD
                    nce = crd(output.embedding, teacher_output.embedding, index, labels)
                    loss = loss + scale * kd["crd_weight"] * nce
                if use_logit and use_kd:
                    temperature = kd["logit_temperature"]
                    kl = F.kl_div(F.log_softmax(output.logits / temperature, dim=-1),
                                  F.softmax(teacher_output.logits / temperature, dim=-1), reduction="batchmean") * temperature**2
                    loss = loss + scale * kd["logit_weight"] * kl
                if hn_groups:  # hard-negative: CE giới hạn trong nhóm lớp dễ nhầm, không dùng teacher và không nhân kd scale nên độc lập với ablation KD và với ESKD
                    hn = hard_negative_loss(output.logits, targets, hn_groups)
                    loss = loss + cfg["hn"] * hn
                optimizer.zero_grad(set_to_none=True)
                loss.backward()
                nn.utils.clip_grad_norm_(trainable, train_config["grad_clip"])
                optimizer.step()
                n = len(labels)
                for key, value in (("loss", loss), ("ce", ce), ("cos", cos), ("rel", rel), ("crd", nce), ("kl", kl), ("hn", hn)):
                    sums[key] += value.item() * n
                sums["correct"] += (output.logits.argmax(1) == labels).sum().item()
                sums["seen"] += n
            seen = max(sums["seen"], 1)
            scores = evaluate(model, loaders["validation"], desc=f"epoch {epoch} - validation")
            record = {"epoch": epoch, "kd_scale": scale, "lr": optimizer.param_groups[0]["lr"], "train_acc": sums["correct"] / seen,
                      **{f"train_{k}": sums[k] / seen for k in ("loss", "ce", "cos", "rel", "crd", "kl", "hn")},
                      **({f"train_cos_l{i + 1}": v / seen for i, v in zip(qkv_layers, cos_layer_sum.tolist())} if cos_layer_sum is not None else {}),
                      **{f"val_{k}": v for k, v in scores.items()}}
            history.append(record)
            logger.info("%s epoch %d | loss %.4f ce %.4f cos %.4f rel %.4f crd %.4f kl %.4f hn %.4f | train acc %.4f | val macro_acc %.4f mAP_macro %.4f | lr %.2e",
                        name, epoch, record["train_loss"], record["train_ce"], record["train_cos"], record["train_rel"],
                        record["train_crd"], record["train_kl"], record["train_hn"], record["train_acc"], scores["macro_acc"], scores["mAP_macro"], record["lr"])
            if (epoch * steps_per_epoch) >= warmup_steps:  # chỉ giảm lr sau warm-up
                plateau.step(scores["macro_acc"])
                if optimizer.param_groups[0]["lr"] < record["lr"]:
                    logger.info("%s: val macro_acc không cải thiện, giảm lr %.2e -> %.2e", name, record["lr"], optimizer.param_groups[0]["lr"])
            if RUN_TRAINING:
                run.result_dir.mkdir(parents=True, exist_ok=True)
                pd.DataFrame(history).to_csv(run.result_dir / f"history_{name}.csv", index=False)
                if drive_history is not None:
                    drive_history(run.result_dir / f"history_{name}.csv")
            if scores["macro_acc"] > best_score:
                best_score, best_epoch, stale = scores["macro_acc"], epoch, 0
                best_state = trainable_state(model)
                if RUN_TRAINING:  # lưu ngay khi tốt hơn, để sandbox mất kết nối giữa chừng vẫn còn checkpoint
                    save_model(run.checkpoint_path(name), model, epoch=epoch, macro_acc=best_score, frcrn=str(FRCRN_PATH.relative_to(ROOT)))
                    if drive_best is not None:
                        drive_best(run.checkpoint_path(name), epoch, best_score)  # ghi đè best.pt trên Drive
            else:
                stale += 1
            if resume_path is not None:  # ghi nguyên tử, để bị ngắt giữa lúc ghi vẫn còn bản cũ
                resume_path.parent.mkdir(parents=True, exist_ok=True)
                partial = resume_path.with_name(resume_path.name + ".part")
                torch.save({"epoch": epoch, "flags": flags, "model": trainable_state(model),
                            "crd": crd.state_dict() if crd is not None else None,
                            "optimizer": optimizer.state_dict(), "scheduler": plateau.state_dict(), "history": history,
                            "best_score": best_score, "best_epoch": best_epoch, "best_state": best_state, "stale": stale}, partial)
                partial.replace(resume_path)
                if drive_resume is not None:
                    drive_resume(resume_path)
                if drive_logfile is not None:
                    drive_logfile(run.log_file)
            if stale >= train_config["patience"]:
                logger.info("%s: dừng sớm ở epoch %d (best %d, %.4f)", name, epoch, best_epoch, best_score)
                break
            if cfg["max_epochs"] and epoch >= cfg["max_epochs"]:  # ngân sách epoch của nhánh ablation; lịch lr và warm-up vẫn theo TRAIN["epochs"] nên so được với tham chiếu
                logger.info("%s: dừng ở epoch %d theo max_epochs (best %d, %.4f)", name, epoch, best_epoch, best_score)
                break

        load_trainable_state(model, best_state)
        best_record = next(r for r in history if r["epoch"] == best_epoch)
        val_table = per_snr_table({k.removeprefix("val_"): v for k, v in best_record.items() if k.startswith("val_")})
        logger.info("%s: validation tại epoch tốt nhất %d, 9 chỉ số theo SNR\n%s", name, best_epoch, val_table.round(4).to_string())
        class_names = Mixture36Dataset(split="validation", duration=DURATION).class_names
        analysis_files = analyze_predictions(model, loaders["validation"], "validation", name, run.result_dir, class_names)
        test_table = None
        if eval_test:
            test_loader = build_eval_loader("test", train_config["eval_batch_size"], workers)
            test_table = per_snr_table(evaluate(model, test_loader, desc=f"{name} - test"))
            analysis_files += analyze_predictions(model, test_loader, "test", name, run.result_dir, class_names)
            logger.info("%s: TEST, 9 chỉ số theo SNR\n%s", name, test_table.round(4).to_string())
        if RUN_TRAINING:
            checkpoint_path = run.checkpoint_path(name)
            save_model(checkpoint_path, model, epoch=best_epoch, macro_acc=best_score, frcrn=str(FRCRN_PATH.relative_to(ROOT)))
            run.result_dir.mkdir(parents=True, exist_ok=True)
            val_table.to_csv(run.result_dir / f"per_snr_validation_{name}.csv")
            table_files = [f"per_snr_validation_{name}.csv"]
            if test_table is not None:
                test_table.to_csv(run.result_dir / f"per_snr_test_{name}.csv")
                table_files.append(f"per_snr_test_{name}.csv")
            if use_drive:
                for table_file in table_files:
                    DrivePut(fs, remote_dir, table_file, logger)(run.result_dir / table_file)
                for analysis_file in analysis_files:
                    DrivePut(fs, remote_dir, analysis_file.name, logger)(analysis_file)
            pd.DataFrame(history).to_csv(run.result_dir / f"history_{name}.csv", index=False)
        if drive_logfile is not None:
            drive_logfile(run.log_file)
        summary = {"model": name, "best_epoch": best_epoch, "val_macro_acc": best_score,
                   "val_curve": [r["val_macro_acc"] for r in history if r["epoch"] > 0]}
        return summary, (test_table if test_table is not None else val_table)



    return compare_runs, run_experiment, run_name


@app.cell
def _(
    DATASET_ROOT,
    RUNS,
    RUN_TRAINING,
    compare_runs,
    device,
    run_experiment,
    run_name,
    torch,
):
    # (9) Chạy hàng đợi RUNS ở cell (1). RUN_TRAINING = True huấn luyện đầy đủ, False chạy smoke test nhỏ (mỗi nhánh một lần).
    # Chỉ chạy cell này khi đã đồng ý dùng máy. Mỗi nhánh có resume.pt riêng, nên Run all lần sau nối tiếp được thay vì làm lại từ đầu.
    results = []
    for _cfg in RUNS:
        name = run_name(_cfg)
        print(f"dataset: {DATASET_ROOT} | thí nghiệm: {name} | RUN_TRAINING={RUN_TRAINING} | thiết bị: {device}")
        summary, table = run_experiment(name, _cfg)
        results.append(summary)
        print({k: v for k, v in summary.items() if k != "val_curve"})
        torch.cuda.empty_cache()
    comparison = compare_runs(results)
    comparison
    return


@app.cell(hide_code=True)
def _(mo):
    mo.md(r"""
    ## Hiệu chỉnh bias theo lớp (post-hoc, sau huấn luyện)

    Student thường dự đoán lệch về một số lớp (Telephone, Flute, Gong... bị dự đoán thừa; Drawer, Hi-hat, Violin, Microwave... bị dự đoán thiếu). Thay vì huấn luyện lại, cộng một bias theo lớp vào logit: `z'_c = z_c + b_c`, rồi `p' = softmax(z')`, `ŷ = argmax p'`. Trọng số, kiến trúc và pipeline đặc trưng giữ nguyên.

    **Bias theo prior.** `b_c = τ · log(q_c / p_c)`, với `q_c = 1/C` (val và test đều 180 clip/lớp) và `p_c` là tỉ lệ mẫu val được student dự đoán là lớp c trước hiệu chỉnh. Lớp dự đoán thừa có `p_c > q_c` nên `b_c < 0`; lớp dự đoán thiếu có `b_c > 0`. `τ ∈ [0, 1]` là cường độ.

    | Chế độ | Áp dụng cho | Khi nào dùng |
    | --- | --- | --- |
    | A (conservative) | chỉ lớp có `p_c/q_c > 1,25` hoặc `< 0,80`, còn lại `b_c = 0` | an toàn hơn khi val nhỏ hoặc nguồn nhiễu val/test khác nhau |
    | B (full) | cả C lớp | khi lệch dự đoán lan rộng |

    **Quy trình (`src/calibration.py`, hàm `run_calibration` ở cell dưới).**

    1. Chạy student trên val, lấy logits, tính baseline (accuracy, macro recall/precision/F1, confusion, tỉ lệ dự đoán/thật từng lớp).
    2. Quét lưới `τ ∈ {0; 0,1; 0,2; 0,3; 0,5; 0,75; 1}` cho cả hai chế độ (không dùng gradient).
    3. Chọn theo thứ tự: macro recall val, rồi macro F1 val, rồi độ lệch dự đoán trung bình `mean_c |n̂_c/n_c − 1|` nhỏ hơn. Ràng buộc: không lớp nào mất recall quá 0,05, trừ khi macro recall tăng ít nhất 0,02.
    4. Chấp nhận nếu trên val macro recall tăng ≥ 0,02 hoặc macro F1 tăng ≥ 0,015, có không quá 2 lớp mất recall quá 0,05, và độ lệch dự đoán không tăng.
    5. Chỉ khi được chấp nhận mới khoá tham số và đánh giá test **một lần**. Không chọn τ, chế độ hay tập lớp bằng test.

    **Biến thể có regularization** (`fit_regularized`): học `b` tự do bằng `min CE(z + b) + λ‖b‖²`, khởi tạo `b = 0`, L-BFGS tối đa 200 bước, `λ ∈ {0,01; 0,1; 1}`. Dùng khi bias theo prior dao động mạnh.

    **Temperature scaling** chia logit cho `T` không đổi thứ tự nên không đổi top-1 và không sửa prior shift; chỉ dùng nếu cần xác suất đáng tin.

    Nếu macro recall không tăng hoặc các cặp nhầm âm sắc (Violin–Clarinet, Chime–Glockenspiel...) không đổi, vấn đề nằm ở biểu diễn: dừng hiệu chỉnh và chuyển sang hard-negative sampling, contrastive loss hay augmentation bảo toàn cao độ. Artifact ghi vào `out_dir`: `calibration_config.json`, `class_bias.json`, `val_metrics_{before,after}.json`, `confusion_matrix_val_{before,after}.csv`, `predicted_count_ratio.csv`.

    **Báo cáo đi kèm (để kết luận đáng tin).**

    - **Ổn định theo SNR và nguồn nhiễu** (`compare_groups`, cần `snr` và `noise_source` trong `val_meta`, `test_meta`): macro recall trước/sau cho từng mức SNR và từng nguồn nhiễu. Nhóm nào giảm quá 0,02 được liệt kê trong `worse`. Bias được fit trên toàn val nên có thể giúp ở SNR cao nhưng hại ở SNR thấp, và con số tổng sẽ che điều đó.
    - **Cặp nhầm ưu tiên** (`pair_confusions`): số lần nhầm hai chiều và tỉ lệ trên tổng mẫu thật của hai lớp, trước/sau, trên val và test (Violin–Clarinet, Chime–Glockenspiel, Saxophone–Harmonica, Saxophone–Trumpet, Clarinet–Trumpet, Acoustic guitar–Electric piano, Fireworks–Gunshot, Keys jangling–Writing, Writing–Computer keyboard, Microwave oven–Gong; khớp tên lớp không phân biệt hoa thường, cặp không khớp ghi `pairs_unresolved`). Bias sửa được lỗi do prior; cặp nhầm gần như không đổi nghĩa là lỗi do biểu diễn, cần hard-negative hoặc contrastive thay vì bias. Cặp nhầm tăng mạnh nghĩa là hiệu chỉnh chỉ dời lỗi sang chỗ khác.
    - **Lớp đảo chiều** (`flipped_classes`): lớp từ dự đoán thiếu (< 0,80) sang thừa (> 1,25) trên test hoặc ngược lại, ghi vào `flipped_classes` của summary.
    - **`run_manifest.json`** (`write_manifest`): git commit, SHA-256 của từng checkpoint, cấu hình đặc trưng, ngày chạy và seed. Dùng để chắc rằng bias fit cho checkpoint nào thì chỉ áp cho checkpoint đó, và để so các lần chạy sau này. Ghi ngay từ đầu, kể cả khi hiệu chỉnh không được chấp nhận.

    **Đã thử trên logits thật của student** (epoch 27): chia validation thành hai nửa theo lớp, fit trên nửa này và đo trên nửa kia (5 hạt giống, 10 lần fit). Macro recall chỉ tăng +0,002 (0,3946 → 0,3966) dù độ lệch dự đoán giảm từ 0,32 xuống 0,26, và cả 10 lần fit đều không đạt tiêu chí chấp nhận. Thiên lệch prior có thật nhưng không phải nguyên nhân chính của khoảng cách với teacher, nên hiệu chỉnh bias không phải đòn bẩy chính cho student này; ưu tiên là cải thiện huấn luyện (ablation KD, hard-negative, ESKD).

    Artifact bổ sung trong `out_dir`: `{val,test}_macro_recall_by_{snr,noise_source}.json`, `confusable_pairs.json`, `run_manifest.json`.
    """)
    return


@app.cell
def _(ROOT, np):
    # (10) Hiệu chỉnh bias theo lớp (post-hoc): fit trên val, khoá, rồi áp dụng MỘT lần lên test. Không đổi trọng số.
    from src import calibration as cal


    def run_calibration(val_logits, val_labels, test_logits, test_labels, class_names, out_dir,
                        val_meta=None, test_meta=None, checkpoints=None, feature_config=None, seed=None):
        """Quét (chế độ A/B) x tau trên val, chọn theo macro recall -> macro F1 -> độ lệch dự đoán, kiểm tra tiêu chí chấp nhận.
        Chỉ khi được chấp nhận mới đánh giá test (một lần) và ghi artifact vào out_dir.
        val_meta / test_meta: dict tuỳ chọn {"snr": mảng, "noise_source": mảng} để báo cáo ổn định theo nhóm.
        checkpoints: {tên: đường dẫn} để băm vào run_manifest.json cùng git commit, feature_config và seed."""
        class_names = list(class_names)
        if checkpoints is not None:
            cal.write_manifest(out_dir, checkpoints, feature_config or {}, seed, ROOT)  # ghi cả khi không được chấp nhận
        rows, base = cal.sweep(val_logits, val_labels)
        chosen = cal.select(rows)
        ok = cal.accepted(base, chosen)
        summary = {"accepted": ok, "mode": chosen["mode"], "tau": chosen["tau"],
                   "val_macro_recall": (base["macro_recall"], chosen["metrics"]["macro_recall"]),
                   "val_macro_f1": (base["macro_f1"], chosen["metrics"]["macro_f1"])}
        if not ok:
            return summary, rows  # không chấp nhận: dừng, chuyển sang cải thiện representation
        bias = chosen["bias"]
        config = cal.CalibrationConfig(mode=chosen["mode"], tau=chosen["tau"], class_names=class_names)
        cal.save_artifacts(out_dir, config, bias, base, chosen["metrics"], class_names)
        test_before, test_after = cal.metrics(test_logits, test_labels), cal.metrics(test_logits, test_labels, bias)  # test chỉ chạy tại đây
        summary["test_macro_recall"] = (test_before["macro_recall"], test_after["macro_recall"])
        summary["test_macro_f1"] = (test_before["macro_f1"], test_after["macro_f1"])
        summary["flipped_classes"] = [class_names[i] for i in cal.flipped_classes(test_before["pred_ratio"], test_after["pred_ratio"])]
        for split, logits, labels, meta in (("val", val_logits, val_labels, val_meta), ("test", test_logits, test_labels, test_meta)):
            for key in ("snr", "noise_source"):
                if meta and meta.get(key) is not None:
                    report = cal.compare_groups(logits, labels, np.asarray(meta[key]), bias)
                    cal.save_report(out_dir, f"{split}_macro_recall_by_{key}", report)
                    summary[f"{split}_worse_{key}"] = report["worse"]
        pairs = {"val_before": cal.pair_confusions(base["confusion"], class_names), "val_after": cal.pair_confusions(chosen["metrics"]["confusion"], class_names),
                 "test_before": cal.pair_confusions(test_before["confusion"], class_names), "test_after": cal.pair_confusions(test_after["confusion"], class_names)}
        cal.save_report(out_dir, "confusable_pairs", pairs)
        summary["pairs_unresolved"] = [p["pair"] for p in pairs["val_before"] if not p["resolved"]]
        return summary, rows


    return


if __name__ == "__main__":
    app.run()
