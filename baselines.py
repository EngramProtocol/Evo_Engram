"""
baselines.py — Sinh Bảng 4 (Baseline Comparison) một cách TRUNG THỰC, TÁI LẬP ĐƯỢC.

Đặt file này ở THƯ MỤC GỐC của repo V_ENGRAM_SIMULATION (cùng cấp với src/, ./data/).
Chạy:  python baselines.py
Phụ thuộc: numpy, faiss-cpu, sentence-transformers  (đã có sẵn vì V-Engram dùng).

Mục tiêu: mọi baseline dùng ĐÚNG ground truth, ĐÚNG metric (Success@5/MRR@5 như
src/evaluation.py), và ĐÚNG ma trận SRP như V-Engram (import từ src/routing.py),
để con số so sánh được với V-Engram một cách công bằng.

Năm baseline:
  (0) Exact Brute-Force (IndexFlatIP)  -> kiểm tra harness = 100% so với GT.
  (1) FAISS-HNSW (M=32, efSearch=200)  -> chuẩn ANN tập trung.
  (2) Centralized Multi-Table LSH      -> TRẦN tín hiệu SRP (gom theo Hamming,
                                          global view, KHÔNG mất mát do routing XOR).
  (3) Crypto-DHT cùng ngân sách        -> SÀN: đúng pipeline (gom ~POOL candidate +
                                          rerank ADC) nhưng key = SHA-256 (mất ngữ nghĩa).
  (4) Random-5 (pure chance)           -> bốc đại 5 doc, KHÔNG rerank (đây là nguồn
                                          của con số ~0.1% trong bản nháp cũ).
"""

import os
import json
import hashlib
import numpy as np

# ======================= CẤU HÌNH =======================
import os as _os
# CORPUS=scifact POOL_PER_TABLE=30 python3 baselines.py
CORPUS = _os.environ.get("CORPUS", "code")

PATHS = {
    "code": {
        "emb":      "./data/code_corpus_embeddings.npy",
        "q":        "./data/code_query_embeddings.npy",
        "gt":       "./data/code_ground_truth.json",
        "codebook": "./data/code_pq_codebook.npy",
        "pq_codes": "./data/code_pq_codes.npy",
    },
    "scifact": {
        "emb":      "./data/scifact_corpus_embeddings.npy",
        "q":        "./data/scifact_query_embeddings.npy",
        "gt":       "./data/scifact_ground_truth.json",
        "codebook": "./data/scifact_pq_codebook.npy",
        "pq_codes": "./data/scifact_pq_codes.npy",
    },
    "squad": {
        "emb":      "./data/squad_corpus_embeddings.npy",
        "q":        "./data/squad_query_embeddings.npy",
        "gt":       "./data/squad_ground_truth.json",
        "codebook": "./data/squad_pq_codebook.npy",
        "pq_codes": "./data/squad_pq_codes.npy",
    },
}[CORPUS]

# MODEL_NAME bỏ: query embeddings đọc từ file precomputed
# PHẢI trùng DEFAULT_LSH_SEED trong src/routing.py để so cùng ma trận chiếu.
# Đổi được qua env cho MC8: LSH ceiling và bucket-LSH phụ thuộc ma trận chiếu,
# nên đa seed phải đổi CẢ seed này, không chỉ RNG_SEED.
LSH_SEED         = int(_os.environ.get("LSH_SEED", "20235956"))
NUM_PROJECTIONS  = 5          # L
POOL_PER_TABLE   = int(_os.environ.get("POOL_PER_TABLE", "100"))
# Mục 18: bề rộng bucket để quét, và số ứng viên V-Engram gom được
BUCKET_WIDTHS      = [int(x) for x in _os.environ.get("BUCKET_WIDTHS", "8,10,12,14,16").split(",")]
# Số bucket dò mỗi bảng. 1 = chỉ bucket chính xác (hành vi cũ). Đặt bằng T của
# V-Engram để phép so khớp ngân sách lookup: L*T tra cứu ở cả hai bên.
BUCKET_PROBES      = int(_os.environ.get("BUCKET_PROBES", "1"))
VENGRAM_CANDIDATES = int(_os.environ.get("VENGRAM_CANDIDATES", "4510"))  # ngân sách gom mỗi bảng.
                              # LƯU Ý: phải khớp UNIQUE candidates của V-Engram, không phải
                              # 100/bảng vs ~146 tổng như bản cũ. Đọc mean_candidates từ
                              # result_full_*.json rồi đặt POOL_PER_TABLE = mean/L.
# Đọc từ env để chẩn đoán mục 3.2 được: chạy cả hai chế độ cùng P rồi so,
# xem PQ lấy mất bao nhiêu điểm trên pool của LSH ceiling.
RERANK           = _os.environ.get("RERANK", "adc")   # "adc" | "exact"
INDEXED_COUNT    = None       # None = index toàn bộ corpus (khớp main_simulation NUM_FILES).
                              # Đặt 16000 nếu run chính thức dùng 80/20 (nhớ GT phải tính
                              # trên đúng tập index thì mới đạt được).
HNSW_M, HNSW_EF  = 32, 200
PQ_M, PQ_DSUB    = 256, 4     # 256 subquantizer × 4 chiều = 1024 (khớp node.adc_search)
REPORT_PATH      = "baseline_report.txt"
# MC8: baseline hiện chỉ 1 seed. Cho seed đọc từ env để chạy đa seed —
# nếu hardcode thì 5 lần chạy cho kết quả y hệt.
RNG_SEED         = int(_os.environ.get("RNG_SEED", "42"))
# ========================================================

import faiss
# Import ĐÚNG ma trận chiếu của V-Engram để key hoàn toàn trùng khớp
from src.routing import initialize_lsh_projections
import src.routing as routing


def log(msg): print(msg, flush=True)


# ---------- METRIC: sao y src/evaluation.py ----------
def success_and_mrr(all_retrieved, gt_sets):
    """all_retrieved[q] = list index top-5 (theo thứ tự hạng). gt_sets[q] = set top-5 GT.
    Trả (Recall@5, Success@5, MRR@5).
    Recall@5 = trung bình |retrieved[:5] ∩ GT| / |GT| — KHỚP metric bảng chính.
    Success@5 (Hit@5) giữ để tham chiếu nhưng BÃO HOÀ, không dùng để so cấu hình."""
    hit, mrr, recall = 0, 0.0, 0.0
    for retrieved, gt in zip(all_retrieved, gt_sets):
        inter = set(retrieved[:5]) & gt
        recall += len(inter) / max(1, len(gt))
        if inter:
            hit += 1
        for rank, idx in enumerate(retrieved, 1):
            if idx in gt:
                mrr += 1.0 / rank
                break
    n = len(all_retrieved)
    return 100.0 * recall / n, 100.0 * hit / n, mrr / n


# ---------- PQ: encode + ADC (sao y node.adc_search) ----------
def pq_encode(E, codebook):
    """E (N,1024) -> codes (N,256) uint8, gán mỗi subvector về centroid gần nhất (L2)."""
    N = E.shape[0]
    sub = E.reshape(N, PQ_M, PQ_DSUB)
    codes = np.empty((N, PQ_M), dtype=np.uint8)
    for m in range(PQ_M):
        d = ((sub[:, m, :][:, None, :] - codebook[m][None, :, :]) ** 2).sum(axis=2)  # (N,256)
        codes[:, m] = np.argmin(d, axis=1)
    return codes

def adc_rerank(query_vec, cand_idx, pq_codes, codebook, top_k=5):
    """Trả về top_k index trong cand_idx theo khoảng cách ADC (L2 xấp xỉ) tới query."""
    q_sub = query_vec.reshape(PQ_M, PQ_DSUB)
    diff = q_sub[:, None, :] - codebook            # (256,256,4)
    LUT = (diff ** 2).sum(axis=2)                  # (256,256)
    codes = pq_codes[cand_idx]                     # (C,256)
    dists = LUT[np.arange(PQ_M), codes].sum(axis=1)  # (C,)
    order = np.argsort(dists)[:top_k]
    return [int(cand_idx[i]) for i in order]

def exact_rerank(query_vec, cand_idx, E, top_k=5):
    sims = E[cand_idx] @ query_vec                 # cosine (vector đã chuẩn hoá)
    order = np.argsort(-sims)[:top_k]
    return [int(cand_idx[i]) for i in order]

def rerank(query_vec, cand_idx, E, pq_codes, codebook):
    cand_idx = np.asarray(list(cand_idx), dtype=np.int64)
    if cand_idx.size == 0:
        return []
    if RERANK == "adc" and pq_codes is not None:
        return adc_rerank(query_vec, cand_idx, pq_codes, codebook)
    return exact_rerank(query_vec, cand_idx, E)


# ---------- Random selection: baseline ngang ngân sách ----------
def random_candidates(n_corpus, budget, rng):
    """Bốc NGẪU NHIÊN `budget` ứng viên rồi rerank y hệt các baseline khác.

    Vì sao cần: baseline "Crypto-DHT" (SHA key) trong bản cũ cho 12-39%, TRÙNG KHỚP
    xác suất bốc ngẫu nhiên cùng ngân sách:
        1-(1-500/20000)^5 = 11.9%  (đo được 12.2%)
        1-(1-500/5183)^5  = 39.7%  (đo được 39.0%)
    => Crypto-DHT KHÔNG chứng minh gì về semantic key; nó chỉ là random sampling.
    Đặt Random-N cạnh nó để người đọc thấy hai số trùng nhau.
    """
    return rng.choice(n_corpus, size=min(budget, n_corpus), replace=False)


# ---------- SRP keys (trùng V-Engram) ----------
def srp_bits(E, proj):
    """proj (1024,160) -> bits (N,160) bool, đúng quy ước (E·M > 0) của routing.py."""
    return (E @ proj) > 0

def sha160(s):
    return int(hashlib.sha256(s.encode("utf-8")).hexdigest(), 16) & ((1 << 160) - 1)


def main():
    assert os.path.isdir("src"), "Hãy chạy ở thư mục gốc repo (cần thấy src/)."
    log(f"[*] CORPUS = {CORPUS} | RERANK = {RERANK} | L = {NUM_PROJECTIONS} | POOL/table = {POOL_PER_TABLE}")

    # 1) Nạp dữ liệu
    E = np.load(PATHS["emb"]).astype(np.float32)
    faiss.normalize_L2(E)                          # phòng hờ; emb gốc đã chuẩn hoá
    if INDEXED_COUNT:
        E = E[:INDEXED_COUNT]
    N, dim = E.shape
    log(f"[*] Corpus: {N:,} vectors × {dim} chiều")

    gt_raw = json.load(open(PATHS["gt"], "r", encoding="utf-8"))
    queries = [it["query_text"] for it in gt_raw]
    gt_sets = [set(r["index"] for r in it["top_5_results"]) for it in gt_raw]
    Q = len(queries)
    log(f"[*] Queries: {Q}")

    codebook = np.load(PATHS["codebook"]).astype(np.float32)
    if codebook.shape != (PQ_M, 256, PQ_DSUB):
        log(f"[!] Cảnh báo: codebook shape {codebook.shape} ≠ (256,256,4). Kiểm tra lại.")
    if os.path.exists(PATHS["pq_codes"]):
        pq_codes = np.load(PATHS["pq_codes"])
        if pq_codes.shape[0] != N:
            log("[!] pq_codes lệch số dòng so với corpus -> encode lại.")
            pq_codes = pq_encode(E, codebook)
    else:
        log("[*] Không thấy pq_codes -> tự encode từ emb + codebook ...")
        pq_codes = pq_encode(E, codebook)
    log(f"[*] PQ codes: {pq_codes.shape}")

    # 2) Query embeddings: dùng file PRECOMPUTED, KHÔNG encode lại.
    # V-Engram (main_simulation.py) đọc chính file này. Nếu baseline encode lại bằng
    # model thì hai bên có thể lệch (version model, normalize, prefix instruction),
    # và mọi so sánh giữa chúng mất ý nghĩa. Dùng chung một nguồn mới công bằng.
    log("[*] Nạp query embeddings precomputed ...")
    Qv = np.load(PATHS["q"]).astype(np.float32)
    assert Qv.shape[0] == Q, f"query_embeddings ({Qv.shape[0]}) lệch ground truth ({Q})"
    assert Qv.shape[1] == dim, f"query dim ({Qv.shape[1]}) lệch corpus dim ({dim})"

    # 3) Sanity: brute-force exact PHẢI = 100% so với GT (nếu không -> lệch model/normalize)
    flat = faiss.IndexFlatIP(dim); flat.add(E)  # type: ignore[attr-defined]  # faiss thiếu stub
    _, I = flat.search(Qv, 5)
    bf_ret = [[int(i) for i in row] for row in I]
    bf_r, bf_h, bf_m = success_and_mrr(bf_ret, gt_sets)
    log(f"[SANITY] Brute-Force vs GT: Recall@5={bf_r:.1f}% Success@5={bf_h:.1f}% MRR={bf_m:.3f} (mong đợi ~100%)")
    if bf_r < 99.0:
        log("    ⚠️  < 100% nghĩa là query encode lại KHÁC lúc tạo GT (sai model/version/normalize). "
            "Số baseline vẫn chạy nhưng nên xem lại tính nhất quán.")

    results = {}
    results["Exact Brute-Force (IndexFlatIP)"] = (bf_r, bf_h, bf_m, "Centralized reference = Ground Truth")

    # 4) HNSW
    log("[*] Baseline HNSW ...")
    hnsw = faiss.IndexHNSWFlat(dim, HNSW_M)         # METRIC_L2; với vector chuẩn hoá ~ cosine  # type: ignore[attr-defined]  # faiss thiếu stub
    hnsw.hnsw.efConstruction = HNSW_EF
    hnsw.add(E)
    hnsw.hnsw.efSearch = HNSW_EF
    _, Ih = hnsw.search(Qv, 5)
    hnsw_ret = [[int(i) for i in row if i >= 0] for row in Ih]
    s_r, s_h, m = success_and_mrr(hnsw_ret, gt_sets)
    results[f"FAISS-HNSW (M={HNSW_M}, ef={HNSW_EF})"] = (s_r, s_h, m, "Centralized graph ANN")
    log(f"    Recall@5={s_r:.1f}%  Success@5={s_h:.1f}%  MRR@5={m:.3f}")

    # 5) Chuẩn bị SRP keys (trùng V-Engram) + crypto keys
    initialize_lsh_projections(LSH_SEED)
    projs = routing.PROJECTION_MATRICES            # list L ma trận (1024,160)
    doc_bits = [srp_bits(E, projs[t]) for t in range(NUM_PROJECTIONS)]   # mỗi cái (N,160) bool
    q_bits   = [srp_bits(Qv, projs[t]) for t in range(NUM_PROJECTIONS)]  # (Q,160) bool

    # crypto: top-64 bit của SHA-256 (XOR bị MSB chi phối — đúng tinh thần Kademlia)
    doc_ck = {t: np.array([sha160(f"doc_{i}_tbl_{t}") >> 96 for i in range(N)], dtype=np.uint64)
              for t in range(NUM_PROJECTIONS)}

    # 6) Centralized Multi-Table LSH (TRẦN): gom theo HAMMING, global view, rồi rerank
    log("[*] Baseline Centralized Multi-Table LSH (Hamming gather) ...")
    lsh_ret, pool_sizes = [], []
    for q in range(Q):
        cand = set()
        for t in range(NUM_PROJECTIONS):
            ham = (doc_bits[t] ^ q_bits[t][q]).sum(axis=1)        # (N,) Hamming
            top = np.argpartition(ham, POOL_PER_TABLE)[:POOL_PER_TABLE]
            cand.update(int(i) for i in top)
        pool_sizes.append(len(cand))
        lsh_ret.append(rerank(Qv[q], cand, E, pq_codes, codebook))
    s_r, s_h, m = success_and_mrr(lsh_ret, gt_sets)
    results["Centralized Multi-Table LSH"] = (s_r, s_h, m, f"LSH ceiling, no DHT hops (pool~{int(np.mean(pool_sizes))})")
    log(f"    Recall@5={s_r:.1f}%  Success@5={s_h:.1f}%  MRR@5={m:.3f}  pool TB={np.mean(pool_sizes):.0f}")

    # 7) Crypto-DHT cùng ngân sách (SÀN có rerank): gom theo XOR trên key ngẫu nhiên
    log("[*] Baseline Crypto-DHT (XOR gather, key SHA-256, cùng ngân sách) ...")
    crypto_ret = []
    for q in range(Q):
        cand = set()
        for t in range(NUM_PROJECTIONS):
            qk = np.uint64(sha160(f"query_{q}_tbl_{t}") >> 96)
            d = doc_ck[t] ^ qk
            top = np.argpartition(d, POOL_PER_TABLE)[:POOL_PER_TABLE]
            cand.update(int(i) for i in top)
        crypto_ret.append(rerank(Qv[q], cand, E, pq_codes, codebook))
    s_r, s_h, m = success_and_mrr(crypto_ret, gt_sets)
    results["Crypto-DHT (same budget + rerank)"] = (s_r, s_h, m, "DHT floor: random keys, semantics removed")
    log(f"    Recall@5={s_r:.1f}%  Success@5={s_h:.1f}%  MRR@5={m:.3f}")

    # 7b) BUCKET-LSH (mục 18): cách kinh điển đặt LSH lên DHT.
    # Mỗi object lưu dưới HASH của nhãn bucket b-bit. Truy hồi = tra bucket CHÍNH XÁC:
    # query chỉ tới được object khi b bit đầu TRÙNG KHỚP ở một bảng nào đó, vì băm
    # nhãn bucket đã phá thứ tự khiến không thể "đi sang bucket kề". Đây chính là
    # tính KHẢ DUYỆT (navigability) mà V-Engram giữ được còn bucket-LSH thì mất.
    _probe_note = ("tra bucket chính xác" if BUCKET_PROBES <= 1
                   else f"multi-probe {BUCKET_PROBES} bucket/bảng")
    log(f"[*] Baseline Bucket-LSH ({_probe_note}, quét b) ...")

    # Margin của từng bit: |projection|. Bit có margin nhỏ nhất nằm sát siêu
    # phẳng nên dễ lật nhất — ĐÚNG quy tắc V-Engram dùng (src/routing.py dòng 96,
    # np.argsort(np.abs(proj[:c]))). Dùng chung quy tắc để phép so công bằng:
    # baseline được đúng cơ chế multi-probe mà V-Engram được hưởng.
    q_margin = [np.abs(Qv @ projs[t]) for t in range(NUM_PROJECTIONS)]  # (Q,160)

    def _probe_labels(t, q, b, n_probe):
        """Nhãn bucket gốc + (n_probe-1) nhãn lật một bit yếu nhất."""
        base = list(q_bits[t][q][:b])
        labs = [tuple(base)]
        if n_probe > 1:
            for i in np.argsort(q_margin[t][q][:b])[:n_probe - 1]:
                f = base.copy()
                f[int(i)] = not f[int(i)]
                labs.append(tuple(f))
        return labs

    bucket_rows = []
    for b in BUCKET_WIDTHS:
        # gom doc theo nhãn bucket b-bit, mỗi bảng một từ điển
        tables = []
        for t in range(NUM_PROJECTIONS):
            d = {}
            lab = [tuple(row) for row in doc_bits[t][:, :b]]
            for i, L_ in enumerate(lab):
                d.setdefault(L_, []).append(i)
            tables.append(d)
        ret, pools, empty = [], [], 0
        for q in range(Q):
            cand = set()
            for t in range(NUM_PROJECTIONS):
                for lab in _probe_labels(t, q, b, BUCKET_PROBES):
                    cand.update(tables[t].get(lab, ()))
            pools.append(len(cand))
            if not cand:
                empty += 1
                ret.append([])          # bucket rỗng ở MỌI bảng -> không trả gì
            else:
                ret.append(rerank(Qv[q], cand, E, pq_codes, codebook))
        s_r, s_h, m = success_and_mrr(ret, gt_sets)
        bucket_rows.append((b, s_r, s_h, float(np.mean(pools)), 100.0 * empty / Q))
        log(f"    b={b:>2} T={BUCKET_PROBES}: Recall@5={s_r:5.1f}%  Hit@5={s_h:5.1f}%  "
            f"pool TB={np.mean(pools):7.0f}  query bucket rỗng={100.0*empty/Q:.1f}%")
    # lấy dòng có pool GẦN NHẤT với ngân sách ứng viên của V-Engram để lên bảng chính
    b_best = min(bucket_rows, key=lambda r: abs(r[3] - VENGRAM_CANDIDATES))
    results["Bucket-LSH (exact bucket)"] = (
        b_best[1], b_best[2], 0.0,
        f"b={b_best[0]}, pool~{b_best[3]:.0f} (gần ngân sách V-Engram)")

    # 7c) RANDOM-C (mục 18): bốc C ứng viên ngẫu nhiên rồi rerank BẰNG CÙNG PQ,
    # với C = số ứng viên duy nhất mà V-Engram gom được. Tách bạch giá trị của
    # KHÂU CHỌN ỨNG VIÊN khỏi giá trị của khâu rerank: nếu Random-C gần bằng
    # V-Engram thì rerank đang làm hết việc, còn semantic key thì không.
    log(f"[*] Baseline Random-C (C={VENGRAM_CANDIDATES} ứng viên ngẫu nhiên + rerank) ...")
    rng_c = np.random.RandomState(RNG_SEED + 11)
    randc_ret = []
    C = min(VENGRAM_CANDIDATES, N)
    for q in range(Q):
        cand = set(int(i) for i in rng_c.choice(N, size=C, replace=False))
        randc_ret.append(rerank(Qv[q], cand, E, pq_codes, codebook))
    s_r, s_h, m = success_and_mrr(randc_ret, gt_sets)
    results["Random-C (+ same rerank)"] = (s_r, s_h, m,
        f"C={C} ứng viên ngẫu nhiên, rerank giống hệt")
    log(f"    Recall@5={s_r:.1f}%  Success@5={s_h:.1f}%  MRR@5={m:.3f}")

    # 8) Random-5 (pure chance, KHÔNG rerank) — nguồn của con số ~0.1% cũ
    log("[*] Baseline Random-5 (pure chance) ...")
    rng = np.random.RandomState(RNG_SEED)
    rand_ret = [[int(i) for i in rng.choice(N, size=5, replace=False)] for _ in range(Q)]
    s_r, s_h, m = success_and_mrr(rand_ret, gt_sets)
    results["Random-5 (no rerank)"] = (s_r, s_h, m, "Pure chance ~ 1-(1-5/N)^5")
    log(f"    Recall@5={s_r:.2f}%  Success@5={s_h:.2f}%  MRR@5={m:.3f}")

    # 9) In bảng + ghi báo cáo
    # bảng quét bucket-LSH (mục 18)
    log("")
    log("=== QUÉT BUCKET-LSH (mục 18): recall đổi theo bề rộng bucket ===")
    log(f"{'b':>3s} {'Recall@5':>10s} {'Hit@5':>8s} {'pool TB':>9s} {'bucket rỗng':>12s}")
    for b, sr, sh, pool, emp in bucket_rows:
        log(f"{b:>3} {sr:>9.1f}% {sh:>7.1f}% {pool:>9.0f} {emp:>11.1f}%")
    log("")

    header = f"{'Method':40s} {'Recall@5':>10s} {'Hit@5':>8s} {'MRR@5':>8s}   Note"
    lines = [header, "-" * len(header)]
    order = ["Exact Brute-Force (IndexFlatIP)",
             f"FAISS-HNSW (M={HNSW_M}, ef={HNSW_EF})",
             "Centralized Multi-Table LSH",
             "Bucket-LSH (exact bucket)",
             "Crypto-DHT (same budget + rerank)",
             "Random-C (+ same rerank)",
             "Random-5 (no rerank)"]
    for name in order:
        rc, ht, m, note = results[name]
        lines.append(f"{name:40s} {rc:9.2f}% {ht:7.2f}% {m:8.3f}   {note}")
    table = "\n".join(lines)

    log("\n" + "=" * len(header))
    log(table)
    log("=" * len(header))

    with open(REPORT_PATH, "w", encoding="utf-8") as f:
        f.write(f"BÁO CÁO BASELINE — corpus={CORPUS}, N={N}, Q={Q}, L={NUM_PROJECTIONS}, "
                f"pool/table={POOL_PER_TABLE}, rerank={RERANK}\n\n")
        f.write(table + "\n")
    log(f"\n[*] Đã ghi: {REPORT_PATH}")


if __name__ == "__main__":
    main()