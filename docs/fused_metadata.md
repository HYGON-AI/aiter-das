<!--
SPDX-License-Identifier: MIT
Copyright (c) 2026 Hygon Information Technology Co., Ltd.
-->

# fused_metadata 算子说明与性能报告

本接口面向分页注意力（paged attention）推理的 KV cache 元数据准备，单次 kernel launch 完成 `cache_seqlens_int32` 计算、`cu_seqlens_k` 专属前缀和与 `page_table` 页表 gather，可选同步生成 SWA（滑动窗口注意力）页表。输出原地写入调用方提供的缓冲，接口无返回值。

## 算子功能

记 `B` 为批内请求数、`R` 为 `req_to_token` 行数（KV 池槽数）、`P` 为 `max_seq_pages`（每请求最大页数）、`ps` 为 `page_size`。计算关系为：

```text
cache_seqlens_int32[i] = seq_lens[i] + seq_len_delta
cu_seqlens_k[0] = 0;  cu_seqlens_k[i+1] = Σ_{j<=i} cache_seqlens_int32[j]
page_table[i, c]    = req_to_token[req_pool_indices[i], c*ps] >> log2(ps)
swa_page_table[i, c] = full_to_swa_mapping[req_to_token[req_pool_indices[i], c*ps]] >> log2(ps)   # 仅 use_swa=True
```

- 全部输出**原地写入**调用方缓冲：`cache_seqlens_int32` `[B]`、`cu_seqlens_k` `[B+1]`、`page_table` `[B,P]`、`swa_page_table` `[B,P]`，函数返回 `None`。
- `page_table` / `swa_page_table` 覆盖每行全部 `P` 列（`[0, max_seq_pages)`，与各请求实际序列长度无关）；哪些页有效由调用方结合 `cache_seqlens_int32` 解释，本接口不做长度截断。
- 前缀和在 int64 上累加后写回 int32；`cu_seqlens_k` 单调不减、末项为总 token 数。
- `B=0` 空批快速路径：仅将 `cu_seqlens_k[0]` 置 0，不启动 kernel。
- `page_size` 必须为 2 的幂（含 1）；`ps=1` 时页表即 token 槽位的逐元素直拷（dense 路径）。
- `use_swa=True` 时必须同时提供 `swa_page_table` 与 `full_to_swa_mapping`；SWA 映射使用**未移位**的 token 槽位索引，即先以 `req_to_token[row, c*ps]` 查映射、再对结果移位。

## 接口与参数

```python
from aiter.ops.kvcache_metadata import fused_metadata_kernel_general

fused_metadata_kernel_general(
    seq_lens, req_to_token, req_pool_indices,
    cache_seqlens_int32, cu_seqlens_k, page_table,
    swa_page_table=None, full_to_swa_mapping=None,
    B=0, max_seq_pages=0, page_size=1, seq_len_delta=0, use_swa=False,
)
```

也可经包级导出 `aiter.fused_metadata_kernel_general(...)` 调用。

| 参数 | 类型 / 形状 | 含义与约束 |
| --- | --- | --- |
| `seq_lens` | int32 或 int64 Tensor `[B]` | 每请求 KV 长度；支持非零行步长 |
| `req_to_token` | int32 Tensor `[R, max_tokens]` | token 级映射表：第 r 行第 t 列为该请求第 t 个 token 的物理槽位；行 / 列步长任意（可传非连续视图） |
| `req_pool_indices` | int32 或 int64 Tensor `[B]` | 每请求在 `req_to_token` 中的行号，取值 `[0, R)`；支持非零行步长 |
| `cache_seqlens_int32` | int32 Tensor `[B]`，连续 | **输出**：`seq_lens + seq_len_delta` |
| `cu_seqlens_k` | int32 Tensor `[B+1]`，连续 | **输出**：`cache_seqlens_int32` 的专属前缀和，首项 0 |
| `page_table` | int32 Tensor `[B, P]`，连续 | **输出**：每请求页表，第 c 页取 `req_to_token[pool, c*ps] >> log2(ps)`，覆盖全部 P 列 |
| `swa_page_table` | 可选 int32 Tensor `[B, P]`，连续，默认 `None` | **输出**：SWA 页表；`use_swa=True` 时必填 |
| `full_to_swa_mapping` | 可选 int32 或 int64 Tensor `[max_tokens]` | full KV 槽位到 SWA KV 槽位的映射；`use_swa=True` 时必填，长度须覆盖所引用的全部槽位 |
| `B` / `max_seq_pages` | Python `int`，默认 0 | 批内请求数 / 每请求最大页数 P；非负且不超 int32 |
| `page_size` | Python `int`，默认 1 | 页大小，必须为正的 2 的幂 |
| `seq_len_delta` | Python `int`，默认 0 | 长度偏移，直接计入 `cache_seqlens_int32` |
| `use_swa` | Python `bool`，默认 `False` | 是否同步生成 SWA 页表 |
| 返回值 | `None` | 输出原地写入，无返回张量 |

所有张量须在同一 HIP 设备。`seq_lens` / `req_pool_indices` / `full_to_swa_mapping` 接受 int32 或 int64（内部按 8 种组合零拷贝分发，不做 `.to()` 转换）；`req_to_token` 必须为 int32；四个输出必须为 int32 且连续。接口对 device / dtype / shape / contiguity 做完整静态契约检查（违反直接抛 `RuntimeError`），但不在热路径校验 GPU 上的索引取值——调用方保证 `req_pool_indices` 落在 `[0, R)`、前缀总和可被 int32 表示、`full_to_swa_mapping` 覆盖所引用槽位。

本接口用于推理，不提供反向计算。输出缓冲由调用方预分配并保持存活（out 语义）；首次调用触发 `module_kvcache` 模块的 JIT 编译。

## 使用方式

### 基础：page_size>1 的分页页表

```python
import torch
from aiter.ops.kvcache_metadata import fused_metadata_kernel_general

device = "cuda:0"
B, R, P, ps = 4, 8, 512, 16           # 请求数 / 池行数 / 每请求最大页数 / 页大小
max_tokens = P * ps
seq_lens = torch.tensor([8000, 4096, 16, 123], device=device, dtype=torch.int32)
req_to_token = torch.arange(R * max_tokens, device=device,
                            dtype=torch.int32).reshape(R, max_tokens)
req_pool_indices = torch.arange(B, device=device, dtype=torch.int32)
# 输出缓冲由调用方分配并保持存活；全部 int32 且连续。
cache_seqlens_int32 = torch.empty(B, device=device, dtype=torch.int32)
cu_seqlens_k = torch.empty(B + 1, device=device, dtype=torch.int32)
page_table = torch.empty(B, P, device=device, dtype=torch.int32)
with torch.inference_mode():
    fused_metadata_kernel_general(
        seq_lens, req_to_token, req_pool_indices,
        cache_seqlens_int32, cu_seqlens_k, page_table,
        B=B, max_seq_pages=P, page_size=ps,
    )
assert torch.equal(cache_seqlens_int32, seq_lens)
assert torch.equal(
    cu_seqlens_k,
    torch.tensor([0, 8000, 12096, 12112, 12235],
                 device=device, dtype=torch.int32))
# 第 i 行第 c 页 = req_to_token[req_pool_indices[i], c*ps] // ps；全部 P 列都会写入。
row = req_to_token[req_pool_indices[0]]
assert torch.equal(page_table[0], row[::ps] // ps)
```

### SWA 页表

```python
# 接续上例输入，额外生成滑动窗口注意力的页表。
swa_page_table = torch.empty(B, P, device=device, dtype=torch.int32)
# 演示用恒等映射；真实场景由上层调度器维护 full→SWA 槽位映射。
full_to_swa_mapping = torch.arange(max_tokens, device=device, dtype=torch.int32)
with torch.inference_mode():
    fused_metadata_kernel_general(
        seq_lens, req_to_token, req_pool_indices,
        cache_seqlens_int32, cu_seqlens_k, page_table,
        swa_page_table=swa_page_table,
        full_to_swa_mapping=full_to_swa_mapping,
        B=B, max_seq_pages=P, page_size=ps, use_swa=True,
    )
# swa_page_table[i,c] = full_to_swa_mapping[req_to_token[pool[i], c*ps]] >> log2(ps)
assert torch.equal(swa_page_table, page_table)   # 恒等映射下两者一致
```

上面使用 `arange` 方便核对；真实模型传入调度器维护的 `req_to_token` 与映射表。示例中的断言仅用于正确性展示，不应纳入热路径计时。

### Graph 捕获

kernel 路由与 launch 配置只依赖 `B`、`max_seq_pages`、`page_size` 等宿主标量，输出原地写入固定缓冲；shape 固定后内核序列确定，可按常规流程捕获 CUDA Graph。首次 JIT 必须在捕获之外完成；Graph 输入更新用原地 `copy_`，输出缓冲需保持存活。

## 实现与架构

单一 HIP 实现，无 gfx 特化分支，各支持架构共用同一路径。同一算法的三个自包含 kernel 变体（`fused_metadata_kernel_a/b/c`）在宿主侧路由，kernel 内部无运行时分支；每个变体都是「Phase-1 前缀和 + Phase-2 页表 gather」的完整自包含实现，共享同一套设备函数：

| 变体 | tile | Phase-2 形态 | 每线程页数 |
| --- | --- | --- | --- |
| A | 2048 | kBlockCols 步长循环 | 8 |
| B | 1024 | kBlockCols 步长循环 | 4 |
| C | 256 | tile == block，1 page/thread 单列直写 | 1 |

### 变体路由与适用场景

路由在宿主侧以纯整数运算完成，规则以实测 U 形曲线底部（WG ≈ 256，即 256 线程 block 下 waves ≈ 1024）标定：

```text
wg_a = B * ceil(P / 2048);   wg_b = B * ceil(P / 1024)
wg_a >= 256  ->  变体 A
wg_b >= 256  ->  变体 B
否则          ->  变体 C
```

`use_swa` 与 `page_size` 不参与路由（tile 几何与 SWA 无关，P 本身已是页数）。三组代表性配置的实测标定数据（event ms）：

| 配置 (B, P) | 最优变体 | 实测排序 |
| --- | --- | --- |
| (128, 4096) | A（WG 256） | A 0.027 < B 0.030 < C 0.039 |
| (64, 4096) | B（WG 256） | B 0.018 < A 0.019 < C 0.021 |
| (8, 4096, ps=32) | C（WG 128） | C 0.007 < B 0.008 ≈ A 0.009 |

各变体的适用场景与代表用例：

| 变体 | 触发条件 | 适用场景 | 代表配置（本报告用例） |
| --- | --- | --- | --- |
| A | `wg_a >= 256` | 大批量 / 长序列稳态负载：即使最大 tile（2048 页/block）也能凑足 256 个 workgroup；8 pages/thread 步长循环摊薄 block 调度开销，以最少 block 数完成同样工作量 | v1_9（128,4096）、v1_11（256,4096）、v1_12（128,8192）；B 极大而 P 小的 v6_8（1025,16）也落在此分支——ceil(16/2048)=1 使 tile 不再影响 WG 数（wg_a=1025），每 block 一趟循环覆盖整行 |
| B | `wg_a < 256 <= wg_b` | 中等规模：batch 或页数中等，1024 tile 仍能填满机器而 2048 tile 不能；4 pages/thread 是谷底附近的平衡点 | v1_7（64,4096，wg_a=128/wg_b=256）、v1_8（128,2048，wg_a=128/wg_b=256） |
| C | `wg_b < 256` | launch 下限配置：小 batch（在线 decode 常见 B≤8）或短序列，kernel 时间由 launch 下限主导（AITER 约 4.0–4.8 μs），此时同样工作量切出的 block 数越多越好；tile==block 保留最高并发 | v0_1（1,512）、v0_6（32,512）、v1_4（8,4096，WG=128）、v2/v3/v4 组全部小 shape 用例 |

路由示例（v1_7：B=64, P=4096）：wg_a = 64×ceil(4096/2048) = 128 < 256，wg_b = 64×ceil(4096/1024) = 256 → 变体 B；grid = (64, 4)，每 block 覆盖 1024 列、每线程 4 页。

### 变体实现详解

三变体差异只在 Phase-2 的 tile 几何；`USE_SWA / SHIFT / index_t / pool_idx_t / mapping_t` 全部为编译期模板参数，kernel 内无运行时分支。

**共有骨架**。每个 `__global__` kernel 声明 `__shared__ int64_t prefix_buf[2][64]`（1 KB LDS），先调用共用的 Phase-1 扫描（仅 block `(0,0)` 实际工作，其余 block 空过），再执行各自形态的 Phase-2。block 恒为 256 线程（`__launch_bounds__(256, 2)`，静态断言含完整 wavefront）。Phase-2 唯一的 tail guard 是全局列边界，`[0, P)` 每页恰好覆盖一次——无对齐前提、无布局假设。

**Phase-1 分级前缀和扫描**（三变体共用，仅 block `(0,0)` 执行，按 B 分三级）：

| B 范围 | 算法 | 关键路径 |
| --- | --- | --- |
| `B <= 64` | 64-lane Hillis-Steele inclusive 扫描：6 轮（offset 1→32 翻倍），双缓冲 `prefix_buf[2][64]` 轮转避免读写冲突；无效 lane 以 0 参与扫描、不读 `seq_lens` | 6 轮 LDS 读写 |
| `64 < B <= 1024` | 64 行/组并行扫描：每组跑同样的 6 轮扫描，组间以标量链 `running_offset` 累加组总和（所有线程每轮读同一 LDS 槽，值保持 uniform）；组间 barrier 保证本组读写全部完成后才进入下一组 | 组数 × 6 轮 + 组间链 |
| `B > 1024` | thread-0 串行循环回退（受控降级，保证任意 B 正确；v6_8 B=1025 走此路径） | O(B) 单线程 |

输出语义：`tid < B` 的 lane 同时写 `cache_seqlens_int32`（本地值）与 `cu_seqlens_k` 的 exclusive 前缀，最后一个有效 lane 额外写总和 `cu_seqlens_k[B]`；全程 int64 累加、写出时收窄 int32。所有 `__syncthreads()` 由 block `(0,0)` 全部 256 线程到达（置于 tid 条件之外），避免条件屏障死锁。

**Phase-2 逐列 gather**。共用设备函数 `fused_metadata_gather_one_col`：每列一次 `req_to_token[row, col*ps]` 标量读取（列号先升 int64 再乘，防溢出）；`SHIFT=0`（ps=1）直存，`SHIFT=1` 右移 `log2(ps)` 后存；`USE_SWA` 时以**未移位**的 `page_index` 查 `full_to_swa_mapping`，再对结果移位写 `swa_page_table`。三变体的差异只在列分配方式：

- **变体 A**（tile 2048）：`tile_base = blockIdx.y * 2048`，`tile_end = min(tile_base + 2048, P)`；`for (col = tile_base + tid; col < tile_end; col += 256)`——每线程最多 8 页的步长循环，每 block 覆盖 2048 列，grid = `(B, ceil(P/2048))`。
- **变体 B**（tile 1024）：与 A 同构，tile 换 1024，每线程最多 4 页，grid = `(B, ceil(P/1024))`。
- **变体 C**（tile 256）：`col = blockIdx.y * 256 + tid`，`col >= P` 直接返回——一线程一页单列直写，block 即 tile，grid = `(B, ceil(P/256))`。

**宿主侧入口**（`fused_metadata_kernel_general`）：完整契约检查 → `B=0` 快速路径（`cu_seqlens_k.zero_()` 后直接返回，不 launch）→ 计算 `shift = log2(ps)` → 按上式整数路由选变体 → dtype 8 组合零拷贝分发（无 `.to()`、无 `.contiguous()`）→ `launch_fused_metadata_variant` 以 `grid=(B, 1+(P-1)/tile)`、`block=256` 启动所选 kernel。`1+(P-1)/tile` 写法避免 `P+tile-1` 溢出；`P=0` 时 grid_y 仍为 1，保证 block `(0,0)` 被启动、Phase-1 可执行。

### 较比 LightOp 的优化内容

LightOp 源实现（`fused_metadata_kernel_general_v2`，迁移前基线）为单一 launch 几何：1D grid（每 batch 行一个 block）、Phase-1 恒为 block(0,0) 线程 0 的串行循环、Phase-2 以 int4 向量化（ps=1）或偏移推进 + 4-wide 展开（ps>1）加独立尾部循环实现。AITER 版本在其基础上的优化与修复：

| # | 维度 | LightOp v2 | AITER | 效果（代表用例） |
| --- | --- | --- | --- | --- |
| 1 | grid 形态 | 1D `(B,)`，每行一个 block，P 维串行在 block 内 | 2D `(B, ceil(P/tile))`，P 维切 tile 提升 block 数 | 小 batch 并发从 B 提升到 B×tiles：v1_4（8,4096,ps32）LightOp 8 个 block → AITER（C 变体）128 个，17.683 → 4.715 μs（3.751×）；v0_7（64,1024）12.917 → 4.975 μs（2.596×） |
| 2 | Phase-1 前缀和 | 恒为单线程串行 O(B) 循环 | 分级并行扫描（64-lane Hillis-Steele / 组扫描 / 串行回退） | B=128（2 组扫描）v6_7：50.709 → 19.868 μs（2.553×）；B≤64 一趟 6 轮即完成 |
| 3 | launch 几何自适应 | 单一几何（256 线程、4-wide 展开），不随 shape 调整 | A/B/C 三变体按 WG 数路由，U 谷底实测标定 | 大配置约 1.9–2.1×（v1_7–v1_11 vs LightOp），小配置保住 launch 下限并发 |
| 4 | 尾部覆盖 | ps=1 路径 4-wide 定长 tile + 尾部窗口判定 `tc ∈ [col, col+3)`，P 非 4 对齐时漏写尾部列 | 步长循环以全局列边界为唯一 guard，每页恰好覆盖一次 | 修复 v2 组 6 例（P=5/6/7/1026/1027）与 v6_2（P=259）的对拍失败 |
| 5 | 对齐 / 布局 | ps=1 路径对 `req_to_token` 行首做 int4 reinterpret 加载，要求 16B 对齐且列步长为 1；Python wrapper 对全部张量强制 `.contiguous()`（非连续视图触发隐藏拷贝，输出非连续时写到副本、结果丢失） | 全程标量 int32 读取 + 显式 stride 寻址，任意行/列步长、任意对齐零拷贝支持 | 修复 v4 组 5 例（行宽 1022/1023 行首失配、乱序 pool indices、非连续视图）；消除 wrapper 级拷贝与写丢隐患 |
| 6 | 契约检查 | 仅 6 项 `is_cuda` + mapping dtype | device / dtype / shape / contiguity / `page_size` 幂次 / `use_swa` 依赖全量 TORCH_CHECK | 非法输入宿主侧显式报错，而非静默产出错误结果 |
| 7 | B=0 空批 | `dim3 grid(B)` 以 grid.x=0 启动，触发非法配置错误 | 宿主快速路径：`cu_seqlens_k.zero_()` 后返回，不启动 kernel | 空批安全且零开销 |

沿用 LightOp 的既有设计（非新增优化）：dtype 8 组合零拷贝模板分发、`__launch_bounds__(256, 2)` 的 Occupancy 目标、SWA 以未移位索引查映射的语义。

**代价与权衡**：AITER 移除了 int4 向量化与 4-wide 手工展开，换取任意布局下的正确性与更简单的索引结构——小 shape（v2/v4 组通过用例）上 AITER kernel 与 LightOp 基本持平或略慢（几何平均 1.070×/0.859×）即源于此置换；损失的访存宽度由 2D grid 并发与路由后的 tile 几何在中大 shape 上补回并反超。

## 性能报告

AITER 源码日期：**2026-09-18**（fused_metadata 内核合入于 2026-09-14）。对比三方实现：**AITER** 为本仓库实现（自 LightOp 迁移并优化），**LightOp** 为迁移前源实现，**Triton** 为测试脚本内置的 Triton 参考内核。加速比为 `对方 / AITER`，大于 1 表示 AITER 更快。

### 环境与计时口径

| 项目 | 说明 |
| --- | --- |
| 数据来源 | 本仓库 `op_tests/test_fused_metadata.py` 三方对拍基准实测（2026-09-20 采集） |
| 设备 | HCU（HIP）设备 GPU0；具体卡型与软件版本未随数据源记录 |
| 测试脚本 | `op_tests/test_fused_metadata.py` 三方对拍基准 |

每例先以 `-1` 哨兵做三方对拍（Triton / AITER / 纯 PyTorch 参考逐 buffer `torch.equal` 全量比对，页表未写的位置会保留哨兵值导致比对失败），再以 CUDA event 计时（warmup=20、iters=200、batch=10 取中位数）；AITER / LightOp 计时走 `module_kvcache` 裸 pybind 绑定，绕过 `torch.ops` dispatcher。

- **kernel（μs）**：纯 kernel 设备执行时间。
- **ops（ms）**：经各自 Python 入口的单次调用耗时，含主机分发 / launch 开销。
- JIT、输入生成与 CPU 参考计算不进入计时；计时输入与正确性输入同形重建（固定种子 42）。

**LightOp 源实现在 12 个配置上正确性对拍失败**（下表 ops 记 `FAIL`），其 kernel 时间不纳入对 LightOp 的加速统计；AITER 56 例全部通过。

### Shape 与输入构造

共 6 组 56 个数值配置（组名沿用数据源，`v0` 即测试脚本 `default` 组；`v5` 契约负向组仅断言 `RuntimeError`，不计性能）：

| 组 | 方向 | 用例数 | LightOp 通过 |
| --- | --- | ---: | ---: |
| v0（default） | 基线配置集（LightOp 源测试逐参数移植） | 11 | 11 |
| v1 | 规模扫描：B / P 端点与路由分支两侧 | 12 | 12 |
| v2 | page_size=1 快路径：尾部缺页 / 大 P / delta / SWA | 10 | 4 |
| v3 | page_size>1 通用路径：tail 整行重写 / SWA / delta | 8 | 8 |
| v4 | 对齐与布局：16B 对齐行 / 乱序 pool indices / 非连续 req_to_token | 7 | 2 |
| v6 | 结构边界：最小 launch / 扫描边界 / XL 串行回退 | 8 | 7 |

输入由测试脚本固定种子随机生成：`seq_lens ∈ [1, max_tokens/2+1)`，`req_to_token` 元素为 `[0, max_tokens)` 均匀随机整数，`req_pool_indices` 均匀取自 `[0, num_reqs)`。v4 的对齐 / 非连续调整只用于正确性验证，计时输入同形重建。

### 汇总

kernel 几何平均加速（对 LightOp 仅统计其通过的 44 例；对 Triton 统计全部 56 例）：

| 组 | vs LightOp kernel | vs Triton kernel | vs Triton ops |
| --- | ---: | ---: | ---: |
| v0（default） | 1.375× | 1.434× | 8.912× |
| v1 | 1.730× | 2.156× | 6.068× |
| v2 | 1.070× | 0.822× | 8.303× |
| v3 | 1.320× | 1.092× | 8.585× |
| v4 | 0.859× | 0.832× | 8.262× |
| v6 | 1.966× | 4.448× | 7.045× |
| 全部 | **1.472×** | **1.497×** | **7.722×** |

ops 口径对 LightOp（同为原生 pybind 入口，44 例）几何平均加速 1.448×。

### 典型配置明细

kernel 时间单位 **μs**、ops 单位 **ms**，保留三位小数；`✗` 表示 LightOp 该配置对拍失败，其 kernel 时间不纳入加速统计。

| 用例 | B | P | ps | 备注 | AITER kernel | LightOp kernel | Triton kernel | 加速 vs LightOp | 加速 vs Triton | AITER ops | Triton ops |
| --- | ---: | ---: | ---: | --- | ---: | ---: | ---: | ---: | ---: | ---: | ---: |
| v0_1 | 1 | 512 | 32 | 基线 | 4.469 | 4.684 | 2.698 | 1.048× | 0.604× | 0.008 | 0.070 |
| v0_6 | 32 | 512 | 32 | B 扫描 | 4.359 | 7.819 | 15.484 | 1.794× | 3.552× | 0.008 | 0.066 |
| v0_7 | 64 | 1024 | 32 | B 扫描 | 4.975 | 12.917 | 29.224 | 2.596× | 5.874× | 0.008 | 0.067 |
| v1_4 | 8 | 4096 | 32 | 大 P | 4.715 | 17.683 | 6.851 | 3.751× | 1.453× | 0.008 | 0.066 |
| v1_7 | 64 | 4096 | 16 | 路由边界 | 17.154 | 34.088 | 47.319 | 1.987× | 2.758× | 0.014 | 0.069 |
| v1_8 | 128 | 2048 | 16 | 路由边界 | 15.728 | 32.500 | 69.525 | 2.066× | 4.420× | 0.013 | 0.073 |
| v1_9 | 128 | 4096 | 16 | 规模 | 26.491 | 51.412 | 100.984 | 1.941× | 3.812× | 0.021 | 0.094 |
| v1_10 | 128 | 4096 | 16 | SWA | 39.795 | 74.843 | 107.528 | 1.881× | 2.702× | 0.033 | 0.103 |
| v1_11 | 256 | 4096 | 16 | 规模 | 52.034 | 101.003 | 195.615 | 1.941× | 3.760× | 0.036 | 0.179 |
| v1_12 | 128 | 8192 | 16 | 最大 P | 68.582 | 95.633 | 137.804 | 1.394× | 2.009× | 0.041 | 0.140 |
| v2_5 | 1 | 1025 | 1 | 尾部缺页 | 4.159 | 4.066 | 2.536 | 0.978× | 0.610× | 0.008 | 0.067 |
| v2_10 | 8 | 4096 | 1 | dense | 4.165 | 7.273 | 5.824 | 1.746× | 1.398× | 0.008 | 0.067 |
| v3_2 | 8 | 1025 | 32 | tail 重写 | 4.399 | 6.746 | 5.770 | 1.534× | 1.312× | 0.008 | 0.068 |
| v4_6 | 2 | 512 | 1 | 非连续 r2t | 4.137 | 3.345 | 3.261 | 0.809× | 0.788× | 0.008 | 0.066 |
| v6_2 | 1 | 259 | 1 | 2D tail | 11.901 | 3.272✗ | 107.237 | — | 9.010× | 0.008 | 0.065 |
| v6_3 | 3 | 67 | 2 | 非 4 对齐 tail | 10.978 | 60.177 | 138.431 | 5.482× | 12.610× | 0.008 | 0.066 |
| v6_7 | 128 | 4096 | 16 | 组扫描 2 组 | 19.868 | 50.709 | 87.912 | 2.553× | 4.425× | 0.021 | 0.096 |
| v6_8 | 1025 | 16 | 1 | XL 串行回退 | 109.507 | 115.434 | 398.991 | 1.054× | 3.644× | 0.111 | 0.406 |

### LightOp 失败配置

12 例失败集中在三类边界：`page_size=1` 且 P 非 4 对齐的尾部缺页（v2_1–v2_4、v2_6、v2_7，P = 5/6/7/1026/1027）；`req_to_token` 行首非 16B 对齐或乱序 `req_pool_indices`（v4_1、v4_2、v4_4、v4_5、v4_7，行宽 1022/1023）；P=259 的二维 tile tail（v6_2）。AITER 实现在全部 56 例上三方对拍通过。

### 结果分析

常规规模下 kernel 几何平均加速：AITER vs LightOp **1.472×**（44 例）、vs Triton **1.497×**（56 例）。收益随规模扩大：v1 组 vs LightOp 1.730×、vs Triton 2.156×；`B=3, P=67` 的 v6_3 达 vs LightOp **5.482×**、vs Triton **12.610×**。

小 shape 的 kernel 时间由 launch 下限主导（AITER 约 4.0–4.8 μs）：56 例中有 26 例 Triton 参考内核的纯 kernel 时间短于 AITER（均为小配置），但 Triton 每次 Python launch 的主机开销（≥55 μs）使其 ops 口径全面落后——AITER ops 几何平均快 **7.722×**。对 LightOp（同为原生 pybind 入口），v2/v4 组通过用例上 AITER 与其基本持平或略慢（1.070×/0.859×），属小 shape 固定开销差异；v6_2/v6_3（B ≤ 3 的结构边界配置：P=259 二维 tail、B=3 ps=2 非 4 对齐 tail）AITER kernel 偏高（11.9/11.0 μs），但同配置 LightOp 或正确性失败、或需 60.2 μs，Triton 参考为 107.2/138.4 μs。

正确性方面，迁移在优化性能的同时修复了 LightOp 的 12 个边界缺陷（尾部缺页、对齐 / 布局、二维 tail）。收益来自 tile 路由、2D grid 并行 gather、分级前缀和扫描与 dtype 零拷贝分发等改动的组合，表格不能单独归因各项技术。以上为指定输入分布及平台的 kernel / 单次调用计时结果，不代表模型端到端加速。

## 相关实现与测试入口

接口的功能测试与基准可从 AITER 仓库根目录运行：

```bash
# CLI：全部测试组（default + v1..v6），--bench-only 仅计时，--case v1:3 只跑组内单个配置
HIP_VISIBLE_DEVICES=0 python op_tests/test_fused_metadata.py --case all
# pytest：单组可用 -k 选择，如 -k suite_v2
HIP_VISIBLE_DEVICES=0 python -m pytest -q op_tests/test_fused_metadata.py
```

接口定义见 [Python wrapper](../aiter/ops/kvcache_metadata.py)，native 入口与实现见 [fused_metadata_kernels.cu](../csrc/kernels/fused_metadata_kernels.cu)，契约声明见 [fused_metadata.h](../csrc/include/fused_metadata.h)，三方对拍与计时见 [test_fused_metadata.py](../op_tests/test_fused_metadata.py)。
