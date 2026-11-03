# 解码提速专项：逐格式 CPU 差距与优化对象

> 状态：**工作稿（2026-09-09）· 部分落地**。数据源：
>
> **落地（2026-09-21）**：§4 #6「内存侧」已解决——TTA/DTS 由整文件读入改为流式/定长缓冲，
> 峰值 RSS 35→9MB / 65→10MB（scorecard memory 12→30），PCM 逐位 / corr 不回退；同时修复
> AC-3/E-AC-3 corr 0.96→1.0、Speex corr 0.93→1.0（属**正确性欠账**，非本提速专项）。
> 详见 `benchmark-2026-09-21.md`。**A 档提速（§4.1）仍受 §4.2 授权约束，未动**；B 档未启。
> `docs/archive/benchmark-2026-09-10.md`（scorecard 快照，
> 同机同语料）与 `archive/benchmark-industry-2026-09-05.md` / `engine-integration-bench.md`。
> 本文件回答一件事：**总表看 era ≈ FFmpeg 98%，为何还要谈解码效率？差距在逐格式 ×RT，
> 被 50× 实时封顶遮住了。**
> 关联：[archive/benchmark-industry-2026-09-05.md](archive/benchmark-industry-2026-09-05.md)（评分口径）、
> [audio-kernel-zig.md](audio-kernel-zig.md) §8.4.2（Phase G 优先子项，含基准先行）、
> [archive/engine-master-pool-design.md](archive/engine-master-pool-design.md)（调度/并发侧，本专项与之正交）。

---

## 0. TL;DR

- **总分层面 era 已被封顶掩盖**：speed 维度所有行都 ≥50× 实时 → 全 40/40，总分差
  （−1.9）实际来自 memory（tta/dts RSS）与 correctness（ac3/eac3/speex），不是速度。
- **但逐格式 ×RT，era 普遍落后引擎内 FFmpeg（Stable）1.3–3.6×**；扣掉公共地板
  （wav 行）后，codec 纯解码增量差距更明显（aac 约 3–5×、flac/mka 约 3–4×）。
- 真机代价：移动端/ARM 电池与 CPU、128 路并发余量、播放时多任务头room——scorecard
  看不到，因为本机 i9 全格式都远超实时。
- **结论**：值得开「解码提速专项」，但**先用 `perf` 定位热循环，再对对象下刀**，
  不拍脑袋。第一批候选（按收益排序）见 §4。

---

## 1. 前提核对：为什么"总表 98%"与"效率偏低"不矛盾

SCORE 计分 `speed = 40·min(1, R/50)`：**达到 50× 实时即满分**，之上不区分。
本机（i9-13980HX，ReleaseFast）era 最慢行 flac/mka ×RT≈0.003–0.004（≈250–330× 实时），
早已越过 50× 门槛 → 速度维度无法再分辨差距。因此**「相对 FFmpeg 98%」反映的是
"都够快"，不反映"一样快"**。逐格式 wall/×RT 才是看 decode 效率的正确口径。

## 2. 逐格式差距（SCORE_2026-09-06，era vs 引擎内 Stable）

| 格式 | era ×RT | Stable ×RT | ratio | decode 增量估* |
|---|---|---|---|---|
| flac | 0.00307 | 0.00107 | 2.9× | ~3.3× |
| mka(flac轨) | 0.00383 | 0.00107 | 3.6× | ~4.3× |
| aac(adts) | 0.00180 | 0.00056 | 3.2× | ~5× |
| aac(m4a) | 0.00157 | 0.00082 | 1.9× | ~2× |
| vorbis | 0.00107 | 0.00057 | 1.9× | ~2× |
| dts | 0.00207 | 0.00107 | 1.9× | ~2× |
| mp3 | 0.00132 | 0.00082 | 1.6× | ~1.5× |
| ac3 / eac3 | 0.00132 | 0.00082 | 1.6× | ~1.5× |
| opus | 0.00232 | 0.00157 | 1.5× | ~1.4× |
| tta | 0.00207 | 0.00157 | 1.3× | ~1.2× |
| mp2 | 0.00107 | 0.00082 | 1.3× | ~1.3× |
| wv | 0.00333 | 0.00282 | 1.2× | ~1.2× |
| **wav（引擎地板）** | 0.00057 | 0.00032 | **1.8×** | — |
| speex | 0.00057 | 0.00082 | 0.7×（更快） | — |

\* `decode 增量估 = (era×RT − era_wav地板) / (Stable×RT − Stable_wav地板)`。
**口径局限**：Stable 与 era 走同一 C 壳（float32 PCM 落盘），但解码→输出的字节形态
不完全同构（era 原生位深→convert，Stable ffmpeg 直接出 float）——增量是粗估，只作排序，
不作精确声明。落地前用 `perf` 的 user CPU calltree 复核。

## 3. 差距构成两分（决定先打谁）

1. **引擎公共地板偏高**：连 wav（纯 PCM 拷贝 + 转 float32）都比 Stable 慢 1.8×。
   说明「解码 → f32 交错输出 → 引擎写入」这段公共路径有统一可榨的水分——**改一处，
   全格式受益**（含已封顶的 wav/speex）。候选：中间 `raw` 缓冲的一次多余拷贝、
   convert 每样本函数/除法、写入路径。
2. **codec 纯解码增量差距**：扣掉公共地板后 aac/flac/mka/mp3 仍是 1.5–5×。ffmpeg 的
   优势在解码方案层：预计算表 + f32 + 整数/查表 + 快速变换，era 侧需按格式定位。
   历史上 flac「×RT≈0.02 很慢」最后根因是 io 前瞻缓存而非解码器本体——**教训：先 profile
   再动手**。

## 4. 优化对象候选（perf 定位后按实际命中取舍）

| # | 对象 | 理由 | 风险/纪律 |
|---|---|---|---|
| 1 | **公共 PCM/convert 地板** | 一改全格式受益（§3.1） | 不动语义层；保留「解码原生位深、convert 统一转 f32」不变量（§2.1） |
| 2 | **MDCT/IMDCT 系**（aac 解码+合成、mp3 合成、flac？） | 高频大块变换，ffmpeg 走预计算+快速路径 | 查是否 f64、每点重复算窗/三角；可 `@Vector`/分块；有损容差内 |
| 3 | **Huffman / 位读取**（aac/mp3） | 逐位函数调用可改批量取位/查表 | bit-exact 易验证 |
| 4 | **浮点整肃** | `powf/logf/expf/atanf/sqrtf` 常是隐形大头 → 查表/多项式 | 有损格式须保 corr 纪律 |
| 5 | **mp3 多相合成** | 可换 IMDCT 快速合成 | 保 |corr|≥0.999 / ±≤1 LSB 纪律 |
| 6 | **内存侧（非速度）**：tta/dts 整缓冲 RSS | ✅ **已解决（2026-09-21）**：改流式/定长缓冲，tta 35→9MB、dts 65→10MB，memory 12→30 | 详见 `benchmark-2026-09-21.md` |

### 4.1 方向定调（2026-09-10 用户定）：**零新增缓冲，纯计算砍指令**

> 决策：**不采用缓冲/缓存类提速**——不加 Reader 大块预读、不加位流宽缓冲、不加持久
> 中间缓冲。理由：属"作弊"式增益、抬高内核常驻开销、且规避与上游的争端。
> 依据 perf（`docs/archive/benchmark-2026-09-10.md`）：era 与 ffmpeg 的差距是**指令数 2.1–3.4×**
> 而 **CPI 更低**（0.26–0.31 vs 0.42–0.48）——瓶颈是"同功能做了太多指令"，不是访存。
> 因此路线 = **在不新增任何缓冲区/缓存层的前提下削减指令**（寄存器内取位、查表、
> SIMD、分支消除、f32 化、循环不变量外提、算法专用化）。

按 perf 实测热区重排动刀顺序（一次只动一个，§5 纪律）：

| 序 | 对象（perf 热区） | 纯计算手段（无缓冲） | 验收 |
|---|---|---|---|
| ① | **flac 位流 `readBits` ~34% + `io.Reader.read` ~20%** ✅ | 已做：`Reader.readByte()` 单字节快路径（无新缓冲）+ `readBits` 缓存足够快路径 + comptime 掩码表 + `readBit` 直取 | 逐位一致 ✔；perf 指令 **600M→462M（−23%）** |
| ② | **flac 残差/Rice 内层 ~12%** ✅ | 已做：`readUnary1` 缓存内批量数零替换逐位 readBit | 逐位一致 ✔；合成语料指令 461.9M→460.7M（前缀短，收益小） |
| ③ | **mp3 `synthGranule` ~20% + `imdct36` ~7%** ⛔B 档 | 预计算/`@Vector` 属浮点重排（B 档）；按只做 A 档策略暂缓 | — |
| ④ | **aac `decodeIcs` ~39%（谱/Huffman/去量化）** ✅(Huffman 部分) | 已做：Vlc 规范表 O(1)/长度查表（去每长度二分）；去量化查表待评估 | aac 逐位 ✔；m4a 指令 455M→418.7M（−8%） |
| ⑤ | **aac MDCT/FFT ~11%** ⛔B 档 | f32/预计算/SIMD 属浮点（B 档）；按策略暂缓 | — |
| — | **flac LPC 重建内层** | 已做：滑动窗口切片 zip + i32 环绕 `+%=`（A 档） | 逐位 ✔；合成语料中性 |
| — | 公共 `pcm.convert` ~2% | 低优先（收益小） | — |
| — | mp3 Huffman | 已是 FFmpeg 式直接查表（`codebook[hufPeek]`），无 A 档空间 | — |

**A 档收官（2026-09-10）**：可安全削减的整数/查表热点已基本吃尽——
① flac 位流 −23%、② flac Rice（小）、④ aac Huffman −8%，均零缓冲、逐位一致。
进一步显著提速须进入 **B 档**（浮点重排 / `@Vector` / 快速变换：mp3 `synthGranule`/
`imdct36`、aac MDCT 等），会改变数值、**涉及音质**，列为**独立专项**：
- 仅在**明确授权**后启动；无损类**绝不允许**（必须逐位）；
- 有损类每步过 `|corr|≥0.999` + ±≤1 LSB 门禁（现 mp3/aac 贴 ±1 LSB，风险中）；
- 且遵守 §4.2 启动/开销硬约束（预计算不得劣于 FFmpeg）。

**边界澄清（待确认）**：局部寄存器/`u64` 位累加器、SIMD 寄存器、只读常量查表视为
**纯计算**（非"缓冲"）；持久缓冲区/额外预读/缓存层视为禁止项。若"位累加器"亦属禁用，
则 ① 退化为仅精简现有实现的算术与分支（不改取数结构）。

### 4.2 精度安全分层：**只做 A 档 + 三层预计算**（2026-09-10 用户定）

> 决策：提速优化**仅采用 A 档（精度中性）**；B 档（有精度风险）除有损类且经 corr 门禁
> 外，原则上不做；C 档（降位深/近似/偷精度）禁止。

**三档定义（每步按档审查）**
- **A 精度中性**：分支消除 / 循环不变量外提 / 去重复计算 / 去函数调用·vtable·边界检查 /
  整数位运算与查表 / Huffman 单查表 / 把每帧重算的窗·三角·系数改为 **comptime 预计算**
  （同公式同舍入）。**无损类只允许 A 档**，必须逐位一致。
- **B 有精度风险**（仅限有损、且过 corr≥0.999 + ±≤1 LSB 门禁）：浮点重排 / SIMD 浮点 /
  f64→f32 / FMA 重结合 / 快速变换替换 / `powf`→多项式。ac3/eac3/speex 既有欠账不碰。
- **C 禁止**：降位深、跳过校正、近似窗、量化查表偷精度、fast-math 式近似。

**三层预计算（A 档手段，非"缓冲"）**
1. **全局 comptime 表**（进程内 1 份，零运行期增长）：窗/twiddle/Huffman 解码表/pow43 等
   ——若现每帧重算，上提到 comptime 纯赚；
2. **每实例 `prepare`（open 时一次，与解码同 worker）**：按该任务格式/采样率/声道/块类型，
   用**同公式**算派生表/状态；热循环只查表。整数逐位不变、浮点同舍入；
3. **派发 hint**：Master 已知任务类型 → `Task.format_hint`（免 probe 直选 Module）+ 下传
   **预计算计划 ID**，worker `open` 阶段先 `prepare(plan)` 再解码。

**纪律**：预计算产出必须是**只读派生常量/计划**（表、系数），**不得**是数据缓冲、预读输入、
缓存 PCM。禁止把预计算放到与解码**不同**的线程（跨线程搬表=反开销）；即"派发时**要求**
worker 先 prepare"，不是另开线程算。

**启动/开销硬约束（2026-09-10 用户定）**：**即使做了预计算，启动与常驻开销仍必须优于
FFmpeg**（archive/engine-master-pool-design.md §3 启动预算：冷/热首帧 wall 均压 FFmpeg）。
落地要求：
- **comptime 表零运行期成本**（编译期生成、只读数据段）——首选手段，不占启动/内存增长；
- **实例 `prepare` 必须 O(小)、open 时一次、与解码同 worker**，其耗时计入首帧预算；
  预计算后首帧/单流 wall 不得回退到 FFmpeg 基线之上，否则该优化**拒绝**；
- **派发 hint 省 probe**（`format_hint`）是启动净收益，优先；
- 每次优化后复测**冷/热首帧**（`docs/archive/benchmark-2026-09-10.md` 口径：冷含引擎 init、
  热复用池）与单流 wall；启动回退即回退该改动。

**验收（每步）**：无损逐位 / 有损 corr≥0.999 且 ±≤1 LSB 不回退；`taskset -c 12 perf stat
-e instructions,cycles` 指令数下降（主指标）；**且冷/热首帧与常驻开销不劣于 FFmpeg
基线**；任一项不过即回退。

## 5. 纪律（验收门，scorecard 已内建）

- **无损类**：输出 f32 PCM md5 与 `flac -d` / ffmpeg 逐位一致（lossless bit-exact）；
- **有损类**：`|corr| ≥ 0.999` 且 ±≤1 LSB（s16 域）不劣化——**现全部达标**：mp3/mp2/aac/dts
  已达；ac3/eac3 corr 0.96→1.0、speex 0.93→1.0 已于 2026-09-21 修复（属既有**正确性欠账**，
  非提速专项）。
- 每步重跑 `zig build test`（全量）→ scorecard 全矩阵，看**逐格式 wall 下降**与
  **正确性零回退**；以同轮 CSV 快照判档（跨轮 ±0.5–4 抖动，看分差方向）；
- **新增**：每步同时跑 `taskset -c 12 perf stat -e instructions,cycles` 对同格式同语料，
  确认**指令数下降**（这才是本方向的主指标，而非仅 wall）。

## 6. 第一步（动刀前必做）

```bash
cd app/core/audio-engine
zig build -Doptimize=ReleaseFast && cmake --build build
# 语料 /tmp/eng2 已含 ind.flac / ind.m4a / ind.mp3（scorecard 幂等生成）
perf stat   build/archoera-audio-engine /tmp/eng2/ind.flac --engine-mode 1 --player-file /tmp/o.wav --no-limiter
perf record build/archoera-audio-engine /tmp/eng2/ind.m4a  --engine-mode 1 --player-file /tmp/o.wav --no-limiter
perf report  # 定位热循环 → 对照 §4 候选
```

- 先取 era 与 Stable（mode 0）同文件的 user CPU calltree 对照，确认差距落在**哪段**
  （公共层 vs 具体 codec 函数）；
- 一次只动一个对象，动完即跑 §5 门。
- 工具可用性（2026-09-10）：本机暂缺 `perf`/`valgrind`——先 `sudo pacman -S perf`（cachyos：
  `linux-tools`）或装 `valgrind`；不可用则退化为**探针式热循环定位**（对 §4 候选函数做
  `std.time`/`Io.Clock.awake` 计时打桩跑真实曲目，输出耗时占比定位瓶颈，见文末补充）。
- 关联（2026-09-10）：并发/混杂/资源基准与 scorecard 口径见
  `archive/benchmark-industry-2026-09-05.md`「2026-09-10 更新」与
  `docs/archive/benchmark-2026-09-10.md`（FFmpeg=100、5 轮
  去极值、wall/CPU/RSS 入分）；动刀后可用同口径复测并发与单流。
- **perf 结果（2026-09-10）**：`docs/archive/benchmark-2026-09-10.md`——era 指令=Stable
  2.1–3.4×（CPI 更低 0.26–0.31 vs 0.42–0.48 ⇒ 非低效而是**指令多**）。热区（自占比）：
  flac `readBits` ~34% + `io.Reader.read` ~20%（位流≈50%）；aac `decodeIcs` ~39%（谱/
  Huffman/去量化域，MDCT 系 ~11%）；mp3 `synthGranule` ~20% + `readImpl` ~19% + `imdct36`
  ~7%（IMDCT+合成 ≈28%）；公共 `pcm.convert` 仅 ~2%（修正 §3.1 猜测）。Stable libavcodec
  stripped 缺符号，仅总量对照。
  建议动刀序（一次一个，§5 纪律）：①flac 位读批量取位/宽缓冲 → ②公共 Reader 大块预读 →
  ③mp3 IMDCT/多相快速化 → ④aac 谱/Huffman/去量化查表 → ⑤aac MDCT 专用化。

## 7. 与当前工作的关系 / 排期

- **正交**：Module 表/Registry（结构转换）与播放迁池/调度是**并发与生命周期**侧；
  本专项是**单核解码效率**侧。两者共享 `fmt/*`，互不阻塞，可在调度主干落地前后并行。
- 建议排期：**先动 §4 #1（公共地板）**，收益全格式、改动集中；codec 侧（#2–#5）
  在 perf 指认后按「差距大 × 命中明确」逐个攻（aac/adts、flac/mka 优先）。
- 本文件为工作稿，命中数据与结果回填后升级为定稿。

## 8. 复现

```bash
cd app/core/audio-engine/tests/bench
python3 scorecard.py --corpus /tmp/eng2 --csv data/SCORE_$(date +%F).csv \
    --md SCORE_$(date +%F).md --build-tag <tag>
```

> 机器/工具/口径与已知抖动见 `archive/benchmark-industry-2026-09-05.md` §4/§7（i9-13980HX、
> zig 0.16.0、ReleaseFast kernel、单轮 RSS/wall 采样抖动 ±0.5–4 分——看 era vs Stable
> 的**分差方向**而非个别行绝对分）。

## 9. 2026-09-22：公共 PCM 地板 + 任务节点池（方向④ P1/P3）

对应 `audio-kernel-expansion-plan.md` §5.2 的 P1/P3。口径：`taskset -c 2` 固定核、200s 语料；
主指标为 `tests/bench/insn_count.c`（`perf_event_open` 统计子进程用户态指令数，本机无 `perf`）。

### 9.1 P1 公共 PCM / convert 地板（一改全格式受益）

- `io.Reader.seek` 仅 `whence=end` 才 `fstat`（start/current 是位置读常态，此前每 chunk 白付一次）；
- `io.readFile` 命中前瞻缓存改**整段 memcpy**（PCM 每 chunk 8KB，原为逐字节循环）；新增 `Reader.readAt`；
- `pcm/convert.zig` 的 `endian` 由运行期参数**下沉为 comptime**（消除每样本 `@byteSwap` 分支）；
- `fmt/wav/lib.zig` `readData` 走 `readAt`（按段定位批量读，免 16KB 预读 + 二次拷贝）。

| 格式 | era 前 | era 后 | Δ | FFmpeg(Stable) | era/stable 前→后 |
|---|---|---|---|---|---|
| **wav** | 874.7M | **214.7M** | **−75.4%** | 413.0M | 2.12× → **0.52×** |
| flac | 10.752G | 10.670G | −0.8% | 1.724G | 6.24× → 6.19× |
| **mp3** | 3.296G | **2.196G** | **−33.4%** | 1.380G | 2.39× → 1.59× |

> flac 提升小：其热路径走 `readByte`/自建位缓冲，不经过被修的 `readFile` 字节循环，仅吃到
> `convert` 的无分支化收益。

### 9.2 P3 实例内存池（任务节点自由表）

`runtime.zig`：worker 完工把任务节点归池、`submit` 优先复用（与任务队列同一 mutex，不引入新原语），
容量有界 `node_pool_cap=512`（≈12KB）。`bench_era_pool` 128 路混合格式：

| 指标 | 无池(cap=0) | 有池(512) | Δ |
|---|---|---|---|
| malloc | 9205 | **1940** | **−78.9%** |
| free | 9217 | **1943** | **−78.9%** |

即消除 128 并发下「每 chunk 一次任务节点 malloc/free」风暴（解码主导，故指令数指标不敏感）。

### 9.3 精度与次帧（门禁复核）

- **精度中性**：无损（wav/flac）逐位一致；有损（mp3）输出 md5 前==后，对 ffmpeg f32 `corr=1.0`、`max 1 LSB`。
- 首帧 `bench_coldstart` p50 µs：wav 25→**13**（FFmpeg 13）、mp3 118→**101**（FFmpeg 37）均改善；
  **flac 首帧 220µs 属既有编解码开销（`git stash` A/B 证实非本次引入）**，open/create 段远快于 FFmpeg。
- 仍未做：按格式实例 ctx arena / Reader 缓冲复用（跨 `fmt/**` 的较大重构）。

## 10. 2026-09-22：FLAC 专修（无损，bit-exact 强制）

前置调研与计划见 `flac-optimization.md`。FLAC 未吃到 §9 的 P1（其热路径走 `readByte`/自建位缓冲），
故专攻**位流 + CRC**。**无损 → 全程 bit-exact。**

保留改动（FL-1 + FL-5）：
- **位流**：u64 位缓存 + `io.Reader.peek`（不消费 `pos`）批量 refill（复用既有 16 KiB 缓冲、零新增缓冲）；
  **懒 CRC**（只对已载入位流的字节累加，有效帧绝不载入下一帧字节）；帧末 `drain()` 推进已消费字节；
  `readUnary1` 改 u64 `@clz`。
- **CRC**：逐位循环 → comptime 256 项查表（`era_crc8_table`/`era_crc16_table`）+ word 级 4 字节 unrolled。

| 状态 | insn | cycles |
|---|---|---|
| 改前 | 7.599G | 1.880G |
| FL-1 单独（旧逐位 CRC） | 7.489G（−1.4%） | 1.74G |
| FL-5 单独（旧逐字节 reader） | 5.197G（−31.6%） | 1.27G |
| **FL-1 + FL-5** | **5.001G（−34.2%）** | **1.357G（−27.8%）** |

精度：引擎 f32 payload md5 改前==改后，且 `cmp` FFmpeg 参考**逐位一致**。
首帧（p50 µs）：hot 196→120、cold 195→117、create 22→19、cold begin+create 245→157。
回退（如实）：FL-2（LLVM 已内联）、FL-3（`@Vector(4,i64)` 点积 cycles +12%）、
FL-4（去相关已被 LLVM 自动向量化）。验证：`zig build test` 679/679（5 seed）；ctest 22/22；Windows 交叉通过。

## 11. 2026-09-23：FLAC 惰性 33-bit 缓冲 + P4 守卫（方向④）

- **FLAC 惰性缓冲**：`kernel/fmt/flac/lib.zig` 原**无条件**分配 `decoded33_buf`
  （`i64 × 2 × max_blocksize`，如 2×4096×8 ≈ 64 KiB），但仅在 **32-bit FLAC**
  （`bits_per_sample == 32` 且非独立声道，走 33-bit 宽解码路径）才使用。改为按该条件分配：
  16/24-bit（绝大多数）路径每实例省下该缓冲；`destroyCtx` 已有 `len>0` 守卫，
  `openMeta` 零长语义不变，全量 FLAC **逐位测试不回退**。
- **P4 守卫**：`tests/bench/guard_release.py`（+ `guard_baseline.json`）对固定语料跑
  `bench_coldstart` / `bench_era_pool`，断言 era 冷/热首帧 p50 不劣于 FFmpeg 基线（带容差）
  且峰值 RSS 不超基线；语料缺失时优雅 SKIP（退出 0），默认不入 ctest（时序敏感）。
  把「每次改动复测」纪律落成可执行守卫。

> **未做（明确记录）**：按格式实例 **ctx arena / Reader 缓冲复用**——跨 `fmt/**` 的较大重构
> （25 个模块各自的 ctx 与 alloc/realloc 语义，含运行期 realloc，arena 会破坏内存收口目标），
> 留待独立专项（见 §9.3）。

## 12. 2026-10-06：Opus 解码砍指令（方向④ B 档，有损，全程逐位一致）

> 参考实现经本机代理克隆对照：`xiph/opus`（libopus `celt/*`、`silk/*`）与
> `FFmpeg`（`libavcodec/opus/*`）。口径：`tests/bench/insn_count.c`
> （`perf_event_open` 用户态指令数），`taskset -c 2`，语料 `/tmp/eng2/ind.opus`
> （200s 立体声 128k CELT）。**基线为新工具链重建的改动前内核**（同一二进制口径 A/B）。

### 12.1 定位（`perf record/report` + 行号级 `perf annotate`）

本机 `perf` 可用后，热区一目了然（自占比）：`celt.decodeFrame` ~36%、
`pvq.quantBand` ~29%、`lib.decodeNextPacket` ~10%（其中 f32→s16 写出）、
`rc.decUint` ~4%、`readImpl` ~4%。行号级进一步指认：

- **去加重量化**：`celt.deemphasis` 的手写 `lrintf`（为复刻 C `lrintf` 就近偶数）
  在无 SSE4.1 的基线目标下把 `@trunc` 降级为 **每样本一次 libm `truncf@plt` 调用**，
  加分支/`cmov`，单样本 ~35 条指令，占 `decodeFrame` 自身约 **1/3**。
- **f32→s16 + 立体声交错**：`decodeNextPacket` 自身几乎全是逐样本 `f32ToS16` 与 2 字节拷贝。
- **连续 PCM 拷贝**：`readImpl` 逐样本 `@memcpy(2~4B)`；`celt` 的 `buf` 前移逐元素拷贝。
- **归一化/缩放**：`denormalize`、PVQ `algUnquant`/`lowband_out`、双声道 `(a+b)/2` 等
  逐样本乘加。

### 12.2 改动（A 档 + B 档「逐 lane 独立」SIMD，零新增缓冲）

- **`lrintfEven`**（`celt.zig`）：`(x + 1.5·2^52) - 1.5·2^52` 无分支就近偶数舍入，
  位级等同 C `lrintf`，**不再产生 libm 调用**；同时把 `SIG2RES×2^-15` 与
  `RES2INT24×2^23` 两次 2 的幂缩放合并为 `tmp×2^8`（消一次 `mulss`）。
- **`fmt/opus/vec.zig`**（新增）：可移植 SIMD——`f32ToS16x8`（含有限性掩码 + f32 域
  clamp，避免 inf/NaN 的 `@intFromFloat`）、`interleave8`、`scaleInPlace`/`scaleCopy`/
  `avgHalfInPlace`/`intToFloatScale`/`copyForwardsGap8`。**只打包相互独立的 lane**，
  每 lane 运算顺序与标量逐条相同（不重结合、不引 FMA），故输出逐位一致。
- **CELT 立体声 f32→s16 批量转换 + 交错**（`lib.zig`）：`out_f` 两声道 ×8 lane
  一次性转换、交错写入 `pcm_buf`；非 2ch/2ch 走标量兜底。
- **`denormalize` / PVQ `algUnquant` / `lowband_out` / 双声道 `(a+b)/2`**：就地 SIMD。
- **`buf` 前移**（`celt.zig`）：`copyForwardsGap8`（前置 `src-dst ≥ 8`，CELT 恒成立），
  语义与逐元素正向 memmove 一致。
- **`readImpl`**（`lib.zig`）：pre-skip 整段丢弃、`pcm_buf` 连续段整段 `@memcpy` 到 `out`，
  替代逐样本拷贝。

### 12.3 结果

| 语料（200s） | 改前 | 改后 | Δ 指令 | Δ cycles |
|---|---|---|---|---|
| ind.opus（立体声 128k，CELT） | 5.113G | **3.702G** | **−27.6%** | 2.012G → **1.365G（−32.2%）** |
| op_mono.opus（单声道 64k） | 2.949G | **2.325G** | −21.2% | — |
| op_silk.opus（单声道 16k，SILK） | 3.303G | **2.823G** | −14.5% | — |
| op_hybrid.opus（立体声 10ms，Hybrid） | 4.886G | **3.633G** | −25.6% | — |

同口径 FFmpeg（内嵌 libopus，`-f null -`）ind.opus 约 2.76G：era/FFmpeg 指令比由
**1.85× → 1.34×**。

**正确性（逐位）**：`ind`（CELT）/`mono`/`SILK`/`Hybrid`/`speech`/`tiny`/`multi`
Ogg + mka + m4a(Opus) 共 9 个语料，改动前后引擎输出 WAV **md5 完全一致**；
`zig build test` **730/730**（含新增 4 个 SIMD 位级一致性用例）、ctest **36/36**、
`-Dtarget=x86_64-windows-gnu` 交叉编译通过。

> **未做（明确记录）**：`pvq.cwrsi`（组合数索引→脉冲向量，逐元素串行、含表查找）与
> kissfft 蝶形（复数乘、twiddle 跨步 gather/scatter）为剩余最大单体（各约占总指令
> 7~8%），SIMD 收益/风险比低，留待后续专项；`deemphasis` 的 int24→f32→s16 回环
> 受「与 libopus 逐位一致」约束，暂不融合。回退（实测无收益/负收益）：尝试把
> `norm` 归约改为向量累加——会改变浮点累加顺序，**破坏逐位一致**，不做。

### 12.4 续（同日）：去加重批量 / SILK·Hybrid 输出路径 / 公共地板

在 §12 基础上继续（仍全程逐位一致），逐条实测：

| 改动 | 位置 | 说明 |
|---|---|---|
| 去加重批量转换 | `celt.deemphasis`（accum=0） | IIR 仍串行，8 个 `r` 攒起来一次性做 f32 转换+存储，消逐样本 `cvtsi2ss`/`mulss` |
| 立体声合并 / 归一化缩放 | `pvq.stereoMerge` / `renormalizeVector` | 独立 lane 向量化 |
| SILK·Hybrid 输出 | `lib.interleaveOut` / `decodeSilkFrame` | i16 交错、`f32(ch48)·2⁻¹⁵+out_f`→s16 叠加改 8-lane 批量 |
| 公共 PCM 地板 | `pcm/convert.zig` | 16/32-bit 整型→f32 归一化改 8-lane 向量（小端直载、大端 `@byteSwap`） |

| 语料 | 改动前（本轮） | 最终 | Δ |
|---|---|---|---|
| ind.opus（CELT） | 5.113G | **3.514G** | **−31.3%**（cycles 2.012G → 1.33G） |
| op_mono | 2.949G | 2.269G | −23.1% |
| op_silk | 3.303G | 2.650G | −19.8% |
| op_hybrid | 4.886G | 3.347G | −31.5% |

**回退（实测无收益/负收益，不留代码）**：
- `cwrsi` 的 `norm` 由 f32 顺序累加改整数累加（理论上 Σval²≤K²<2²⁴ 可精确等价）——
  实测 **+0.17%（略降）**，整数 `imul`+`u64` 加与额外溢出判断不比 `cvtsi2ss`+`mulss` 划算，回退。
- `iirFir`/`up2HQ`（SILK 重采样）为整数串行 IIR/FIR，跨样本/相位无独立 lane，未动。

### 12.5 续：区间解码器 `rc.zig`（位读取批量取位 + 整数开方）

- **`BitReader.readBits`**：原逐位循环（每读 1 字节约 170 条指令）改**内联热路径**——
  一次 64 位大端加载跨字节取位段（`peekBits`）；帧尾不足 8 字节 / 越界补零 / `n==0`
  走 `readBitsSlow` 冷路径，逐位语义不变。`decNormalize` 每轮 `readBits(8)` 由此大幅提速。
- **`ffSqrt`**：整数平方根由逐位逼近（每次约 80 条指令）改
  `@intFromFloat(@sqrt(f64))`——a ≤ 2³²−1 时 ⌊√a⌋ ≤ 65535，f64 正确舍入且结果距整数
  边界 ≫ ulp，截断即精确 floor（`decUintTri` 热点）。
- 回退：128 位倒数乘法替换 `decUint` 除法（+0.05%）、`tellFrac` 比较选移位（+0.04%），
  均因硬件 `div` 本就单指令而不划算。

叠加到 §12.4 之上（同口径）：ind.opus **3.514G → 3.203G（−8.9%）**、
mono 2.269G → 2.087G、silk 2.650G → 2.567G、hybrid 3.347G → 3.131G；
`rc.decUint` 自占 6.1% → 2.6%。9 语料 md5 逐位一致、730/730、ctest 36/36、
Windows 交叉通过。

> **累计（对改动前引擎）**：ind.opus **5.113G → 3.203G（−37.4%）**，
> cycles 2.012G → ~1.30G；era/FFmpeg(libopus) 指令比约 **1.85× → 1.16×**。

### 12.6 续：MDCT/FFT（`kissfft.zig`）@Vector 化

- 用可移植 `@Vector`/`@shuffle`/`@bitCast` 打包相互独立的 lane，**逐 lane 运算顺序与
  标量逐条相同**（复数乘 `a.r·b.r − a.i·b.i` / `a.r·b.i + a.i·b.r` 的先乘后加减次序精确
  复现，不重结合、不引 FMA）：
  - `kfBfly5`（最大热点，恒 `N==1`）按 4 个连续 `u` 并行；`fstride==1` 走连续/跨步向量
    加载（`gather2/3/4`），`fstride>1`（`shift>0`/短帧）走 `pack4` 标量 gather。
  - `kfBfly4` 一般分支 / `kfBfly3` 按 4 个连续 `j` 并行（twiddle 跨步 gather）。
  - 预旋转（`stride==1`）、后旋转、TDAC 按 4 个 `i` 并行；预旋转把复数对打包成 64-bit
    一次落盘（**目标均小端**；大端需另议）。
  - 所有向量路径保留标量兜底（`m%4!=0` / `stride!=1` / `N!=1`）。

叠加到 §12.5 之上（同口径）：ind.opus **3.203G → 2.682G（−16.3%）**、
mono 2.087G → 1.827G、silk 2.567G → 2.303G、hybrid 3.131G → 2.652G。

**累计（对改动前引擎）**：

| 语料 | 改动前 | 最终 | Δ | FFmpeg(libopus) |
|---|---|---|---|---|
| **ind.opus** | 5.113G | **2.682G** | **−47.5%** | 2.760G（era **0.97×**，已略快） |
| op_mono | 2.949G | 1.827G | −38.0% | — |
| op_silk | 3.303G | 2.303G | −30.3% | — |
| op_hybrid | 4.886G | 2.652G | −45.7% | — |

**超覆盖校验**：除 9 语料外，另测 2.5/5/40/60ms 帧长、NB/WB 单声道、256k 全带宽共
14 个语料，改动前后引擎输出 WAV **md5 全部一致**（覆盖 FFT 的 `shift`/`stride` 各路径）；
`zig build test` 730/730、ctest 36/36、Windows 交叉通过。

> **未做（明确记录）**：`pvq.cwrsi` 组合数索引→脉冲向量（逐元素串行、含表查找）仍是
> 最大单体（约占 `quantBand` 1/4），SIMD 收益/风险比低；预旋转 64-bit 打包为小端专用，
> 若将来支持 BE 目标需改为 `@Vector(8,f32)` 双写。





