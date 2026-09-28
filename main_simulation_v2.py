"""
V-Engram simulation v2 — chạy với data mới (code/scifact/squad).

Thay cho main_simulation.py cũ (đang crash vì file data cũ đã bị xoá).

Sửa so với bản cũ:
  1. Đường dẫn data mới, tham số hoá --dataset
  2. Dùng query_embeddings precomputed (đã normalize) thay vì model.encode()
     -> bản cũ KHÔNG normalize query trong khi codebook train trên vector norm=1 => ADC lệch
  3. Sửa bug ngân sách: ngân sách theo TỪNG bảng, không cộng dồn (bản cũ: bảng 1 ghé 14 node,
     bảng 2-5 mỗi bảng ghé đúng 1 node)
  4. Đo 3 tầng recall: reachable / returned / final -> tách discovery vs PQ filtering
  5. Chế độ --no-pq: rerank bằng cosine vector gốc (oracle upper bound)
  6. Tham số hoá K_QUERY, METADATA_ANCHORS để sweep

Cách chạy:
  python main_simulation_v2.py --dataset code --seed 20235956 --k-query 300 --meta-anchors 30 --use-pq --nq 100
  python main_simulation_v2.py --dataset code --seed 20235956 --k-query 20  --meta-anchors 1  --no-pq  --nq 100

LƯU Ý VỀ ĐỘ TRUNG THỰC (quan trọng khi đọc số):
  Bản này KHÔNG đi walk Kademlia lặp. Nó tính XOR tới TOÀN BỘ node rồi lấy K
  node gần nhất toàn cục (net.knn). Đây là LOOKUP LÝ TƯỞNG HOÁ — giả định client
  tìm được ngay K node gần nhất tuyệt đối, không tốn vòng nào.

  Kademlia thật đi lặp và chỉ XẤP XỈ tập đó, nên số recall ở đây là CẬN TRÊN.
  Đối chiếu: main_simulation.py (SimPy, walk thật) cho Recall@5=77% ở cùng cấu
  hình mà bản này cho 80% — chênh ~3 điểm.

  Hệ quả: không đo được R_max, số vòng, hay RPC ở bản này. Những đại lượng đó
  phải lấy từ main_simulation.py.
"""
import argparse, json, random, time
import numpy as np

_PT_STATS = {}
from typing import Optional

from src.routing import initialize_lsh_projections, generate_multi_semantic_keys


# ------------------------------------------------------------------ #
# Mô hình mạng tối giản (không SimPy): chỉ đo RECALL, không đo latency.
# Nhanh hơn nhiều -> sweep được nhiều cấu hình. Latency đo riêng sau.
# ------------------------------------------------------------------ #
class FastNetwork:
    def __init__(self, num_nodes, seed):
        rnd = random.Random(seed)
        # 63-bit thay vì 160-bit: đủ để phân biệt 10k node, cho phép vector hoá numpy
        self.node_ids = np.array([rnd.getrandbits(63) for _ in range(num_nodes)], dtype=np.int64)
        self.num_nodes = num_nodes
        self.ram = [dict() for _ in range(num_nodes)]   # node_idx -> {tag: pq_code}
        # Mục 16: None = tất cả node còn sống. Khi tắt node, hai mảng này giữ
        # chỉ số và ID của các node còn lại.
        self.alive_idx: Optional[np.ndarray] = None
        self.node_ids_alive: Optional[np.ndarray] = None

    @staticmethod
    def key63(vector, proj):
        bits = (np.asarray(vector).flatten() @ proj > 0).astype(int)[:63]
        return np.int64(int(''.join(map(str, bits)), 2))

    def knn(self, key, k):
        # Nếu đã tắt node (mục 16), chỉ tìm trong tập còn sống: client không thể
        # định tuyến tới node đã chết, và cũng không "nhìn thấy" chúng.
        alive, ids_alive = self.alive_idx, self.node_ids_alive
        if alive is not None and ids_alive is not None:
            d = np.bitwise_xor(ids_alive, key)
            k = min(k, len(alive))
            if k <= 0:
                return np.array([], dtype=np.int64)
            loc = np.argpartition(d, k - 1)[:k]
            return alive[loc]
        d = np.bitwise_xor(self.node_ids, key)
        k = min(k, self.num_nodes)
        idx = np.argpartition(d, k - 1)[:k]
        return idx

    @staticmethod
    def probe_keys63(vector, proj, T, c=16):
        """Sinh T prefix: key gốc + (T-1) biến thể lật bit YẾU nhất.

        Bit 'yếu' = |v . r_i| nhỏ => vector nằm sát siêu phẳng chiếu => bit dễ lật
        ở neighbor đúng (boundary effect, mục 3.2 của paper). Lật đúng những bit
        đó = đi tới subtree mà neighbor nhiều khả năng rơi vào.
        Chỉ lật trong c bit đầu vì chỉ prefix mới quyết định vùng node.
        """
        pr = np.asarray(vector).flatten() @ proj
        bits = (pr > 0).astype(int)[:63]
        base = int(''.join(map(str, bits)), 2)
        keys = [np.int64(base)]
        if T <= 1:
            return keys
        c = min(c, 63)
        weak = np.argsort(np.abs(pr[:c]))          # bit yếu nhất trước
        for j in weak[:T - 1]:
            keys.append(np.int64(base ^ (1 << (62 - int(j)))))
        return keys

    def metadata_count(self):
        return np.array([len(r) for r in self.ram])


def gini(x):
    x = np.sort(np.asarray(x, dtype=float))
    n = len(x)
    if x.sum() == 0:
        return 0.0
    return float((2 * np.arange(1, n + 1) - n - 1) @ x / (n * x.sum()))


def main():
    ap = argparse.ArgumentParser()
    ap.add_argument('--dataset', default='code',
                    help="Tên bộ dữ liệu, khớp tiền tố file trong ./data/. "
                         "Ví dụ: code, scifact, squad, code50k, code100k. "
                         "Không giới hạn danh sách để thêm corpus weak-scaling "
                         "mà không phải sửa code.")
    ap.add_argument('--nodes', type=int, default=10000)
    ap.add_argument('--seed', type=int, default=20235956)
    ap.add_argument('--k-query', type=int, default=300, help='số node mỗi bảng ghé (K_QUERY)')
    ap.add_argument('--meta-anchors', type=int, default=30, help='số node neo metadata (MA)')
    ap.add_argument('--table-pool', type=int, default=0, metavar='M',
                    help='rút M ma trận chiếu rồi giữ L tốt nhất (0 = tắt). '
                         'Chọn theo tỉ lệ trùng prefix trên tập hiệu chuẩn riêng.')
    ap.add_argument('--calib-queries', type=int, default=100,
                    help='số query CUỐI dùng để hiệu chuẩn, tách khỏi tập đánh giá')
    ap.add_argument('--local-topk', type=int, default=30, help='mỗi node trả top-k')
    ap.add_argument('--target-k', type=int, default=10, help='top-k cuối trả về client')
    ap.add_argument('--nq', type=int, default=100, help='số query chạy (500 = full)')
    ap.add_argument('--use-pq', dest='use_pq', action='store_true', default=True)
    ap.add_argument('--no-pq', dest='use_pq', action='store_false')
    ap.add_argument('--pq-variant', default='', metavar='V',
                    help="Hậu tố file PQ. '' = m=256 mặc định (256 byte/doc); "
                         "'m512' = dùng *_pq_codes_m512.npy (512 byte/doc, sai số "
                         "~10x nhỏ hơn). PQ là trục DUY NHẤT không ảnh hưởng tỉ lệ "
                         "semantic/random, vì cả hai đều dùng chung PQ.")
    ap.add_argument('--num-tables', type=int, default=None, metavar='L',
                    help='L — số bảng chiếu. Mặc định lấy từ routing.py (5).\n'
                         'LƯU Ý: tăng L NHÂN metadata theo L (L*r ban/doc), nên no\n'
                         'roi vao dung bay r*: random routing cung trung cao.\n'
                         'Chi co T (multi-probe) la KHONG nhan metadata.')
    ap.add_argument('--multi-probe', type=int, default=1, metavar='T',
                    help='Số prefix probe mỗi bảng (T=1 là single-probe như hiện tại). '
                         'Lật T-1 bit YẾU nhất (|proj| nhỏ = vector sát siêu phẳng). '
                         'Tăng node chạm nhưng KHÔNG tăng nhân bản metadata.')
    ap.add_argument('--probe-bits', type=int, default=16, metavar='C',
                    help='Chỉ xét lật bit trong C bit đầu (prefix hiệu dụng)')
    ap.add_argument('--zipf', type=float, default=0.0, metavar='S',
                    help='Phân bố query Zipf với tham số s (0 = đều). Đo RPC load\n'
                         'per node: hotspot lưu trữ khác hotspot TRUY VẤN.')
    ap.add_argument('--per-table-stats', action='store_true',
                    help='Mục 2: đo reachable recall CỦA TỪNG BẢNG riêng lẻ và\n'
                         'tương quan giữa các bảng. Trả lời: các bảng có ĐỘC LẬP\n'
                         'như Phương trình OR-amplification giả định không?')
    ap.add_argument('--prefix-occupancy', action='store_true',
                    help='Báo cáo occupancy keyspace tại c=4,8,12,16')
    ap.add_argument('--node-loss', type=float, default=0.0, metavar='F',
                    help='Tắt F phần node NGAY TRƯỚC khi query (mục 16).\n'
                         'Node chết: không xuất hiện trong knn, metadata trên đó\n'
                         'mất theo. Đây là mô hình STATIC FAILURE, không phải\n'
                         'churn: node không quay lại, không re-anchor, không repair.')
    ap.add_argument('--routing', default=None,
                    choices=['semantic', 'random_slots', 'random_unique', 'random_keys',
                             'random_equalcand'],
                    help='Chế độ định tuyến (mục 1 nhận xét của thầy):\n'
                         '  semantic      = dùng semantic key (mặc định)\n'
                         '  random_slots  = chạm L*K*T node ngẫu nhiên UNIQUE.\n'
                         '                  Đây là "oracle uniform-node sampling":\n'
                         '                  giả định client chọn được node bất kỳ\n'
                         '                  dù KHÔNG có global membership view.\n'
                         '                  (= --random-routing cũ)\n'
                         '  random_unique = chạm ĐÚNG số node unique mà semantic\n'
                         '                  chạm cho CHÍNH query đó. Ngân sách node\n'
                         '                  khớp tuyệt đối.\n'
                         '  random_keys   = chọn L*T KEY ngẫu nhiên rồi Kademlia\n'
                         '  random_equalcand = bốc node tới khi đủ SỐ ỨNG VIÊN\n'
                         '                     mà semantic gom được (khớp compute)\n'
                         '                  lookup mỗi key lấy K node. Không cần\n'
                         '                  global view, trả chi phí routing y hệt,\n'
                         '                  node gom theo cụm như semantic.')
    ap.add_argument('--random-routing', action='store_true',
                    help='BASELINE: chạm cùng số node nhưng chọn NGẪU NHIÊN '
                         '(không dùng semantic key). So với bản thường để biết '
                         'routing có đóng góp gì không.')
    ap.add_argument('--out', default=None)
    args = ap.parse_args()

    D = f'./data/{args.dataset}'
    print(f"[*] Nạp data: {args.dataset} | PQ={'BẬT' if args.use_pq else 'TẮT (oracle cosine)'}")
    E  = np.load(f'{D}_corpus_embeddings.npy')      # (N,1024) đã normalize
    Qv = np.load(f'{D}_query_embeddings.npy')       # (500,1024) đã normalize
    _sfx = f'_{args.pq_variant}' if args.pq_variant else ''
    codes = np.load(f'{D}_pq_codes{_sfx}.npy')          # (N, m) uint8
    codebook = np.load(f'{D}_pq_codebook{_sfx}.npy')    # (m, 256, d_sub)
    gt = json.load(open(f'{D}_ground_truth.json', encoding='utf-8'))
    N_DOCS = len(E)
    print(f"    corpus={N_DOCS:,} | query={len(gt)} | codebook={codebook.shape} "
          f"({codebook.shape[0]} byte/doc)")

    # LSH projections — dùng đúng hàm của repo để không lệch với code gốc
    initialize_lsh_projections(args.seed)
    from src.routing import PROJECTION_MATRICES as _P
    if args.num_tables is None:
        P = _P
    elif args.num_tables <= len(_P) and args.table_pool <= args.num_tables:
        P = _P[:args.num_tables]
    else:
        # Nhánh này giờ cũng chạy khi BẬT over-draw ở L nhỏ: cần rút thêm ma
        # trận ngoài PROJECTION_MATRICES sẵn có để có pool mà chọn.
        # (bản trước chỉ vào đây khi L > len(_P), nên --table-pool bị bỏ qua
        #  im lặng ở cấu hình chốt L=5 — đúng loại lỗi khó thấy nhất.)
        # cần nhiều bảng hơn mặc định -> sinh lại bằng cùng seed, cùng phân phối Achlioptas
        rng = np.random.RandomState(args.seed)
        n_draw = max(args.num_tables, args.table_pool)
        _pool = [rng.choice([0, 1, -1], size=(E.shape[1], 160), p=[2/3, 1/6, 1/6])
                 for _ in range(n_draw)]
        if n_draw > args.num_tables:
            # OVER-DRAW AND SELECT: rút nhiều ma trận hơn cần, giữ những cái có
            # tỉ lệ trùng prefix cao nhất trên một tập query HIỆU CHUẨN TÁCH RIÊNG.
            #
            # Vì sao đáng: p_l đo được dao động 18,1% tới 46,4% trong MỘT lượt rút,
            # nên L ma trận ngẫu nhiên là một mẫu tuỳ tiện từ phân bố rộng. Chọn
            # không đổi giao thức, không làm khoá phụ thuộc dữ liệu (ma trận vẫn
            # ngẫu nhiên, chỉ là chọn ra tập con), và miễn phí ở thời điểm truy vấn.
            #
            # PHẢI tách tập hiệu chuẩn khỏi tập đánh giá, nếu không là chọn trên
            # chính dữ liệu test và con số thu được sẽ lạc quan giả.
            # Tập đánh giá là n_run query ĐẦU (dòng n_run = min(args.nq, len(gt))).
            # Tập hiệu chuẩn lấy từ CUỐI. Phải kiểm không chồng lấn, nếu không
            # là chọn ma trận trên chính dữ liệu test.
            n_cal = args.calib_queries
            _eval_n = min(args.nq, len(gt))
            if _eval_n + n_cal > len(gt):
                n_cal = len(gt) - _eval_n
                print(f"[!] Chỉ còn {n_cal} query cho hiệu chuẩn sau khi chừa "
                      f"{_eval_n} query đánh giá.")
            if n_cal < 20:
                raise SystemExit(
                    f"Không đủ query để hiệu chuẩn: cần >=20, còn {n_cal}. "
                    f"Giảm --nq hoặc dùng corpus có nhiều query hơn.")
            cal_q = Qv[-n_cal:]                      # LẤY TỪ CUỐI
            cal_gt = gt[-n_cal:]
            # Tiêu chí: SỐ BIT KHỚP TRUNG BÌNH trong c bit đầu, giữa sketch của
            # query và sketch của láng giềng thật.
            #
            # Không dùng "trùng prefix chính xác" vì ở c=16 tỉ lệ đó chỉ 0,1-3%,
            # quá thưa để phân biệt mười hai ma trận với vài trăm mẫu. Số bit
            # khớp là đại lượng mượt, cùng chiều với xác suất trùng, và còn phản
            # ánh được multi-probe: probe lật một bit yếu cứu được trường hợp
            # lệch đúng một bit, nên ma trận có nhiều bit khớp hơn cũng dễ được
            # multi-probe cứu hơn.
            c = args.probe_bits
            _cal_idx = [r['index'] for g_ in cal_gt for r in g_['top_5_results'][:5]]
            _cal_qi = [qi for qi in range(n_cal) for _ in cal_gt[qi]['top_5_results'][:5]]
            _Eq = cal_q[_cal_qi]                      # (n_pairs, d)
            _En = E[_cal_idx]                         # (n_pairs, d)
            scores = []
            for pm in _pool:
                bq = (_Eq @ pm[:, :c]) > 0            # (n_pairs, c)
                bn = (_En @ pm[:, :c]) > 0
                scores.append(float((bq == bn).mean()))
            order = sorted(range(n_draw), key=lambda i: -scores[i])
            keep = order[:args.num_tables]
            P = [_pool[i] for i in keep]
            print(f"[*] Over-draw {n_draw} -> giữ {args.num_tables} "
                  f"(hiệu chuẩn trên {n_cal} query cuối, TÁCH khỏi tập đánh giá)")
            print(f"    bit khớp (%) : " +
                  " ".join(f"{100*x:.1f}" for x in sorted(scores, reverse=True)))
            print(f"    giữ lại      : " +
                  " ".join(f"{100*scores[i]:.1f}" for i in keep))
        else:
            P = _pool[:args.num_tables]
    L = len(P)
    print(f"[*] L={L} bảng chiếu, seed={args.seed}")

    net = FastNetwork(args.nodes, args.seed)

    # -------------------- INGESTION: neo metadata -------------------- #
    t0 = time.time()
    print(f"[*] Ingest {N_DOCS:,} doc (MA={args.meta_anchors})...")
    anchor_counts = []          # mục 13: A đo được cho từng object
    for i in range(N_DOCS):
        _anchors_this_doc = set()
        for proj in P:
            skey = net.key63(E[i], proj)
            for nidx in net.knn(skey, args.meta_anchors):
                net.ram[nidx][i] = codes[i]
                _anchors_this_doc.add(int(nidx))
        # A của object này: số node PHÂN BIỆT giữ record. Danh nghĩa là L*r, nhưng
        # nhỏ hơn khi hai khoá ngữ nghĩa cùng rơi vào một node (mục 13).
        anchor_counts.append(len(_anchors_this_doc))
        if (i + 1) % 5000 == 0:
            print(f"    ... {i+1:,}/{N_DOCS:,}")
    mc = net.metadata_count()
    print(f"✓ Ingest xong ({time.time()-t0:.0f}s). Metadata/node: mean={mc.mean():.1f} "
          f"P95={np.percentile(mc,95):.0f} P99={np.percentile(mc,99):.0f} max={mc.max()} "
          f"Gini={gini(mc):.3f} | tổng bản sao={mc.sum():,}")

    # -------------------- QUERY -------------------- #
    m, _, d_sub = codebook.shape        # đọc từ codebook, không hardcode
    n_run = min(args.nq, len(gt))
    # Zipf: query i được chọn với xác suất ~ 1/(i+1)^s. Mô phỏng truy vấn thật:
    # vài chủ đề chiếm phần lớn lưu lượng, phần đuôi hiếm khi được hỏi.
    if args.zipf > 0:
        w = np.array([1.0 / (i + 1) ** args.zipf for i in range(len(gt))])
        w /= w.sum()
        rng_z = np.random.RandomState(args.seed)
        q_order = rng_z.choice(len(gt), size=n_run, p=w)
    else:
        q_order = np.arange(n_run)
    node_rpc = np.zeros(args.nodes, dtype=np.int64)   # RPC load per node
    reach_hit = ret_hit = fin_hit = 0
    table_hits = []              # mục 2: [neighbor][table] -> bool
    global _PT_STATS
    _PT_STATS = {}
    reach_r5 = ret_r5 = 0.0          # Recall@5 tầng 1, tầng 2
    rec5_sum = rec10_sum = 0.0
    uniq_list, touched_list = [], []

    # --random-routing (cũ) == --routing random_slots
    mode = args.routing or ('random_slots' if args.random_routing else 'semantic')
    args.random_routing = (mode != 'semantic')   # giữ cho các chỗ dùng cờ cũ
    # ---- MỤC 16: tắt node sau khi ingest, trước khi query ----
    # Metadata trên node chết mất theo, và node chết không xuất hiện trong knn.
    # Ingest xảy ra TRƯỚC khi tắt, đúng như thực tế: dữ liệu đã được ghi khi
    # mạng còn đầy đủ, rồi một phần mạng biến mất.
    n_dead = 0
    if args.node_loss > 0:
        rnd_kill = random.Random(args.seed + 555)
        n_dead = int(round(args.nodes * args.node_loss))
        dead = rnd_kill.sample(range(args.nodes), n_dead)
        alive_mask = np.ones(args.nodes, dtype=bool)
        alive_mask[dead] = False
        for di in dead:
            net.ram[di] = {}                 # metadata trên node chết mất theo
        net.alive_idx = np.flatnonzero(alive_mask)
        net.node_ids_alive = net.node_ids[net.alive_idx]
        print(f"[*] Tắt {n_dead:,}/{args.nodes:,} node ({100*args.node_loss:.0f}%) "
              f"-> còn {len(net.alive_idx):,}")   # type: ignore[arg-type]

    rnd_route = random.Random(args.seed + 777)
    print(f"\n[*] Chạy {n_run} query... "
          f"{'' if mode == 'semantic' else '[BASELINE: ' + mode + ']'}")
    for _step, qi in enumerate(q_order):
        qi = int(qi)
        item = gt[qi]
        gt5  = [r['index'] for r in item['top_5_results']]
        gt10 = [r['index'] for r in item['top_10_results']]
        q = Qv[qi]

        # LUT cho ADC (chỉ cần khi dùng PQ)
        if args.use_pq:
            qsub = np.asarray(q, dtype=np.float32).reshape(m, d_sub)
            LUT = np.sum((qsub[:, np.newaxis, :] - codebook) ** 2, axis=2)   # (256,256)

        # --- Ripple Search: ngân sách THEO TỪNG BẢNG (sửa bug cộng dồn) ---
        touched = set()
        per_table_touched = []          # mục 2
        if mode == 'semantic':
            for proj in P:
                _tt = set()
                for qkey in net.probe_keys63(q, proj, args.multi_probe, args.probe_bits):
                    _tt.update(int(x) for x in net.knn(qkey, args.k_query))
                touched.update(_tt)
                if args.per_table_stats:
                    per_table_touched.append(_tt)

        elif mode == 'random_slots':
            # Oracle uniform-node sampling, ngân sách SLOT danh nghĩa L*K*T.
            # Chạm NHIỀU node unique hơn semantic vì mẫu ngẫu nhiên hiếm khi trùng,
            # trong khi các probe của semantic hội tụ vào vùng chồng lấn.
            n_touch = args.k_query * L * args.multi_probe
            _al = net.alive_idx
            pool = _al.tolist() if _al is not None else list(range(args.nodes))
            touched = set(rnd_route.sample(list(pool), min(n_touch, len(pool))))

        elif mode == 'random_unique':
            # Ngân sách UNIQUE-NODE khớp tuyệt đối: đếm semantic chạm bao nhiêu node
            # cho CHÍNH query này, rồi lấy đúng bấy nhiêu node ngẫu nhiên.
            sem_touch = set()
            for proj in P:
                for qkey in net.probe_keys63(q, proj, args.multi_probe, args.probe_bits):
                    sem_touch.update(int(x) for x in net.knn(qkey, args.k_query))
            _al = net.alive_idx
            pool = _al.tolist() if _al is not None else list(range(args.nodes))
            touched = set(rnd_route.sample(pool, min(len(sem_touch), len(pool))))

        elif mode == 'random_equalcand':
            # MC7: các baseline hiện khớp SỐ NODE, nhưng node semantic chọn giữ
            # nhiều record hơn (22,5% corpus so với 14,4% ở cùng 4,9% node), nên
            # semantic được nhiều ADC computation hơn ở cùng số node. Câu "differs
            # only in which nodes they choose" vì thế không đúng.
            #
            # Baseline này khớp NGÂN SÁCH TÍNH TOÁN: bốc node ngẫu nhiên cho tới
            # khi gom đủ SỐ ỨNG VIÊN mà semantic gom được cho chính query này.
            sem_touch = set()
            for proj in P:
                for qkey in net.probe_keys63(q, proj, args.multi_probe, args.probe_bits):
                    sem_touch.update(int(x) for x in net.knn(qkey, args.k_query))
            sem_cands = set()
            for nidx in sem_touch:
                sem_cands.update(net.ram[nidx].keys())
            budget = len(sem_cands)

            _al = net.alive_idx
            pool = _al.tolist() if _al is not None else list(range(args.nodes))
            rnd_route.shuffle(pool)
            got = set()
            for nidx in pool:
                if len(got) >= budget:
                    break
                touched.add(nidx)
                got.update(net.ram[nidx].keys())

        elif mode == 'random_keys':
            # Không cần global membership view: chọn L*T KEY ngẫu nhiên trong không
            # gian 63-bit rồi Kademlia lookup mỗi key lấy K node gần nhất. Trả đúng
            # chi phí routing như semantic, và node gom theo CỤM (XOR-gần nhau) thay
            # vì rải đều — đây là baseline thực tế nhất.
            for _ in range(L * args.multi_probe):
                rkey = np.int64(rnd_route.getrandbits(63))
                touched.update(int(x) for x in net.knn(rkey, args.k_query))
        touched_list.append(len(touched))
        for _n in touched:
            node_rpc[_n] += 1   # mỗi node chạm = 1 ADC RPC

        # Tầng 1: reachable — GT có nằm trong RAM của node được ghé không
        reachable_tags = set()
        for nidx in touched:
            reachable_tags.update(net.ram[nidx].keys())
        if set(gt5) & reachable_tags:
            reach_hit += 1
        reach_r5 += len(set(gt5) & reachable_tags) / 5.0

        # --- Mục 2: bảng nào tới được neighbor nào ---
        if args.per_table_stats and per_table_touched:
            for tag in gt5:
                row = []
                for _tt in per_table_touched:
                    row.append(any(tag in net.ram[ni] for ni in _tt))
                table_hits.append(row)

        # Tầng 2: returned — mỗi node trả local top-k
        cand = {}
        for nidx in touched:
            ram = net.ram[nidx]
            if not ram:
                continue
            tags = np.fromiter(ram.keys(), dtype=np.int64, count=len(ram))
            if args.use_pq:
                cm = np.stack([ram[int(t)] for t in tags])            # (n,256)
                dist = LUT[np.arange(m)[None, :], cm].sum(axis=1)     # ADC
            else:
                dist = -(E[tags] @ q)                                 # cosine (oracle)
            top = np.argsort(dist)[:args.local_topk]
            for j in top:
                t = int(tags[j]); dv = float(dist[j])
                if t not in cand or dv < cand[t]:
                    cand[t] = dv
        uniq_list.append(len(cand))
        if set(gt5) & set(cand.keys()):
            ret_hit += 1
        ret_r5 += len(set(gt5) & set(cand.keys())) / 5.0

        # Tầng 3: final — global rerank
        final = [t for t, _ in sorted(cand.items(), key=lambda x: x[1])[:args.target_k]]
        f5 = set(final[:5])
        if f5 & set(gt5):
            fin_hit += 1
        rec5_sum  += len(f5 & set(gt5)) / 5.0
        rec10_sum += len(set(final) & set(gt10)) / 10.0

        if (_step + 1) % 25 == 0:
            print(f"    {_step+1}/{n_run} | Hit@5={100*fin_hit/(qi+1):.1f}%")

    # -------------------- KẾT QUẢ -------------------- #
    res = {
        'dataset': args.dataset, 'nodes': args.nodes, 'seed': args.seed,
        'k_query': args.k_query, 'meta_anchors': args.meta_anchors,
        # Mục 13: A và M thực đo, để đối chiếu công thức hypergeometric
        'A_distinct_anchors': float(np.mean(anchor_counts)) if anchor_counts else 0.0,
        'A_nominal': L * args.meta_anchors,
        'random_routing': args.random_routing,
        'routing_mode': mode,
        'node_loss': args.node_loss,
        'multi_probe': args.multi_probe,
        'num_tables': L,
        'local_topk': args.local_topk, 'table_pool': args.table_pool, 'use_pq': args.use_pq,
        'pq_variant': args.pq_variant or 'm256',
        'n_query': n_run,
        'reachable_hit5': 100 * reach_hit / n_run,
        'returned_hit5':  100 * ret_hit / n_run,
        'final_hit5':     100 * fin_hit / n_run,
        'reachable_recall5': 100 * reach_r5 / n_run,
        'returned_recall5':  100 * ret_r5 / n_run,
        'recall5':  100 * rec5_sum / n_run,
        'recall10': 100 * rec10_sum / n_run,
        'mean_unique_candidates': float(np.mean(uniq_list)),
        'mean_nodes_touched': float(np.mean(touched_list)),
        'pct_network_touched': 100 * float(np.mean(touched_list)) / args.nodes,
        'metadata_total': int(mc.sum()),
        'metadata_mean_per_node': float(mc.mean()),
        'metadata_gini': gini(mc),
        # Mục 2.4: cần metadata_max để tính tỉ số max/mean qua nhiều seed.
        # Thiếu field này thì aggregate_hotspot.py không kiểm được số 220x.
        'metadata_max': int(mc.max()),
        'metadata_p99': float(np.percentile(mc, 99)),
        'zipf': args.zipf,
        'rpc_gini': gini(node_rpc) if node_rpc.sum() > 0 else 0.0,
        'rpc_p99': float(np.percentile(node_rpc, 99)),
        'rpc_max': int(node_rpc.max()),
        'rpc_mean': float(node_rpc.mean()),
        # --- Mục 17: tải TÍNH TOÁN = số request × số code phải quét mỗi lần ---
        # Đây mới là đại lượng quyết định nút thắt throughput, không phải số request.
        'work_gini': gini(node_rpc * np.array([len(r) for r in net.ram], dtype=np.float64)),
        'work_p99': float(np.percentile(
            node_rpc * np.array([len(r) for r in net.ram], dtype=np.float64), 99)),
        'work_max': float((node_rpc * np.array(
            [len(r) for r in net.ram], dtype=np.float64)).max()),
        'work_mean': float((node_rpc * np.array(
            [len(r) for r in net.ram], dtype=np.float64)).mean()),
        # tương quan giữa "giữ nhiều record" và "nhận nhiều request"
        'corr_load_store': float(np.corrcoef(
            node_rpc, np.array([len(r) for r in net.ram], dtype=np.float64))[0, 1])
            if node_rpc.std() > 0 else 0.0,
    }

    print("\n" + "=" * 62)
    print(f"KẾT QUẢ | {args.dataset} | K={args.k_query} MA={args.meta_anchors} "
          f"L={L} T={args.multi_probe} PQ={'ON' if args.use_pq else 'OFF'}"
          f"{'' if mode == 'semantic' else ' [' + mode.upper() + ']'}")
    print("=" * 62)
    print(f"  {'':34s}  Hit@5    Recall@5")
    print(f"  Tầng 1 reachable (thuần discovery) : {res['reachable_hit5']:6.1f}%  {res['reachable_recall5']:6.1f}%")
    print(f"  Tầng 2 returned  (sau node lọc)    : {res['returned_hit5']:6.1f}%  {res['returned_recall5']:6.1f}%")
    print(f"  Tầng 3 final     (sau rerank)      : {res['final_hit5']:6.1f}%  {res['recall5']:6.1f}%")
    print(f"  --- MẤT Recall@5: do node lọc top-{args.local_topk} = "
          f"{res['reachable_recall5']-res['returned_recall5']:.1f}đ | "
          f"do global rerank = {res['returned_recall5']-res['recall5']:.1f}đ")
    print(f"  Recall@10={res['recall10']:.1f}%")
    print(f"  Candidate unique/query: {res['mean_unique_candidates']:.0f} "
          f"({100*res['mean_unique_candidates']/N_DOCS:.2f}% corpus)")
    print(f"  Node chạm/query: {res['mean_nodes_touched']:.0f} "
          f"({res['pct_network_touched']:.1f}% mạng)")
    _A = res['A_distinct_anchors']; _An = res['A_nominal']
    _M = res['mean_nodes_touched']; _Mn = L * args.k_query * args.multi_probe
    from math import comb
    try:
        _p = 100.0 * (1 - comb(max(0, args.nodes - int(round(_A))), int(round(_M)))
                      / comb(args.nodes, int(round(_M))))
    except (ValueError, ZeroDivisionError):
        _p = float('nan')
    print(f"  [MỤC 13] A đo={_A:.2f} (danh nghĩa {_An}) | M đo={_M:.0f} "
          f"(danh nghĩa {_Mn}) -> P_rand hypergeom={_p:.1f}%")
    print(f"  Metadata: {res['metadata_total']:,} bản ({res['metadata_mean_per_node']:.0f}/node, "
          f"Gini={res['metadata_gini']:.3f})")
    print(f"  [MỤC 17] Tải TÍNH TOÁN (request × code phải quét):")
    print(f"    mean={res['work_mean']:,.0f} P99={res['work_p99']:,.0f} "
          f"max={res['work_max']:,.0f} Gini={res['work_gini']:.3f}")
    print(f"    max/mean = {res['work_max']/max(1e-9, res['work_mean']):.0f}x | "
          f"tương quan (giữ nhiều record ~ nhận nhiều request) = {res['corr_load_store']:+.3f}")
    print(f"  RPC load/node (zipf={args.zipf}): mean={res['rpc_mean']:.1f} "
          f"P99={res['rpc_p99']:.0f} max={res['rpc_max']} Gini={res['rpc_gini']:.3f}")
    if args.per_table_stats and table_hits:
        H = np.array(table_hits, dtype=float)       # (n_neighbor, L)
        p_each = H.mean(axis=0)
        p_bar = float(p_each.mean())
        obs_or = float((H.max(axis=1) > 0).mean())
        pred_or = 1.0 - (1.0 - p_bar) ** H.shape[1]
        # Xuất ra JSON để gộp qua nhiều seed. Bản trước chỉ in ra màn hình nên
        # chẩn đoán độc lập chỉ dựa trên hai lần rút ma trận.
        # res đã dựng ở trên nên phải update TRỰC TIẾP vào nó, không qua biến
        # trung gian — đó là lý do bản trước xuất ra JSON rỗng.
        res.update({
            'p_each': [float(x) for x in p_each],
            'p_bar': p_bar,
            'or_observed': obs_or,
            'or_if_independent': pred_or,
            'or_shortfall': float(pred_or - obs_or),
        })
        print()
        print("  === MỤC 2: CÁC BẢNG CÓ ĐỘC LẬP KHÔNG? ===")
        print("  Reachable recall CỦA TỪNG BẢNG riêng lẻ:")
        for t, pv in enumerate(p_each):
            print(f"    bảng {t+1}: {100*pv:5.1f}%")
        print(f"  Trung bình p = {100*p_bar:.1f}%")
        print(f"  OR của {H.shape[1]} bảng — ĐO ĐƯỢC : {100*obs_or:.1f}%")
        print(f"  OR nếu ĐỘC LẬP 1-(1-p)^L         : {100*pred_or:.1f}%")
        print(f"  => thiếu hụt {100*(pred_or-obs_or):+.1f} điểm")
        # tương quan từng cặp
        cs = []
        for a in range(H.shape[1]):
            for b in range(a + 1, H.shape[1]):
                sa, sb = H[:, a].std(), H[:, b].std()
                if sa > 0 and sb > 0:
                    cs.append(float(np.corrcoef(H[:, a], H[:, b])[0, 1]))
        if cs:
            print(f"  Tương quan cặp bảng: TB={np.mean(cs):+.3f} "
                  f"min={min(cs):+.3f} max={max(cs):+.3f}")
            print("  (0 = độc lập hoàn toàn. DƯƠNG = các bảng cùng thành công/thất bại")
            print("   trên cùng neighbor, nên OR-amplification kém hiệu quả hơn lý thuyết.)")
        # bao nhiêu neighbor được k bảng tìm thấy
        k_cnt = H.sum(axis=1).astype(int)
        print("  Số bảng tìm thấy mỗi neighbor:")
        for k in range(H.shape[1] + 1):
            c = int((k_cnt == k).sum())
            if c:
                print(f"    {k} bảng: {100.0*c/len(k_cnt):5.1f}%")

    if args.prefix_occupancy:
        print('  Prefix occupancy (metadata theo c bit đầu của node_id):')
        for c in (4, 8, 12, 16):
            b = {}
            for ni in range(args.nodes):
                k = int(net.node_ids[ni]) >> (63 - c)
                b[k] = b.get(k, 0) + len(net.ram[ni])
            v = np.array(list(b.values()), dtype=float)
            if v.sum() > 0:
                print(f'    c={c:2d}: {len(v):5d} subtree | CV={v.std()/v.mean():.2f} '
                      f'max/mean={v.max()/v.mean():.1f}')

    # BUG CŨ: tên file thiếu seed và nq -> lần chạy sau GHI ĐÈ lần trước.
    # Hệ quả: Pha 2 chạy 5 seed chỉ giữ lại seed cuối; nq=500 xoá mất nq=200.
    # N phải có trong tên: nhóm H quét N ∈ {5k,10k,20k,40k} ở cùng L/K/r/T,
    # thiếu N thì 4 lần chạy ghi đè lẫn nhau (đúng bug seed/nq trước đó).
    out = args.out or (f"result_{args.dataset}_N{args.nodes}_L{L}_K{args.k_query}_MA{args.meta_anchors}"
                       f"_T{args.multi_probe}"
                       f"_{(args.pq_variant or 'm256') if args.use_pq else 'nopq'}"
                       f"{ {'semantic': '', 'random_slots': '_RANDOM',
                            'random_unique': '_RANDUNIQ',
                            'random_keys': '_RANDKEY',
                            'random_equalcand': '_RANDCAND'}[mode] }"
                       f"{'_loss' + str(args.node_loss) if args.node_loss > 0 else ''}"
                       f"{'_zipf' + str(args.zipf) if args.zipf > 0 else ''}"
                       # local_topk là tham số sweep -> PHẢI có trong tên file,
                       # nếu không bốn lần chạy khác κ sẽ đè lên nhau. Đây đúng
                       # lớp bug đã gặp nhiều lần trong dự án.
                       f"{'_LT' + str(args.local_topk) if args.local_topk != 30 else ''}"
                       f"{'_POOL' + str(args.table_pool) if args.table_pool > 0 else ''}"
                       f"_s{args.seed}_nq{n_run}.json")
    json.dump(res, open(out, 'w'), indent=2)
    print(f"\n→ Lưu: {out}")


if __name__ == '__main__':
    main()