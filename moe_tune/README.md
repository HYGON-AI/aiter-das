<!-- Copyright (c) 2026 Hygon Information Technology Co., Ltd. -->
<!-- SPDX-License-Identifier: MIT -->

# AITER MoE 统一调优

在 AITER 源码目录执行 `moe_tune/tune_moe.py`，用同一份 shape 输入调优 ASM、Triton，或两个后端。`both` 在选定设备上顺序运行，每个后端保留自己的原生配置。原有 `moe_tune_runner.py` 保留不变。

## 快速开始

环境需具备可运行的 AITER 源码和 Torch/HIP。**Triton、BoltOPs 及 `boltops.tools.fused_moe_triton_tune` 必须来自当前 Python 的非 editable 系统安装包（site-packages/dist-packages）。** 当前 ASM 的辅助函数也依赖 BoltOPs。worker 使用 `python -I`，忽略调用方 PYTHONPATH/当前目录对依赖的覆盖；进一步限制 Triton/BoltOPs 子模块来源，并在结果中记录 distribution 版本、根目录和实际加载模块。缺失安装包、editable 源码安装或缺失调优模块会明确报错，不回退到 BoltOPs 源码。AITER 使用当前工程源码。脚本不会安装包；首次调用可能触发正常 JIT。

从 AITER 仓库根目录运行，无需添加 BoltOPs 源码路径，选用一张空闲卡：

```bash
export HIP_VISIBLE_DEVICES=0

# 检查输入和任务列表，无需加载 GPU 包，也不写配置
python moe_tune/tune_moe.py --dry-run --backend both \
  --tokens 1,16,17,64,256 --inter-dim 128 --model-dim 256 \
  --experts 4 --topk 2 --quant-type int8_w8a8_channel --dtype fp16

# 完整原生候选搜索，两个后端均通过独立进程验证后留下产物
python moe_tune/tune_moe.py --backend both \
  --tokens 1,16,17,64,256 --inter-dim 128 --model-dim 256 \
  --experts 4 --topk 2 --quant-type int8_w8a8_channel --dtype fp16 \
  --output-dir hygon_tmp/my_model_tune
```

仅调一个后端时改为 `--backend asm` 或 `--backend triton`。`--device` 是现有可见设备掩码内的逻辑编号，默认 0；脚本不会改动父进程的设备设置。

实际开始调优每个 M 时，控制台会实时显示全局 shape 序号、后端序号和完整参数，例如：

```text
[shape 3/20][backend 1/2: asm][TUNE]
M=17 I=128 D=256 E=4 topk=2 quant=int8_w8a8_channel dtype=fp16
```

shape 总数按规范化/合并后的输入统计，每个 M 计一个 shape，双后端不将 shape 总数翻倍；仅选一个后端时显示 `backend 1/1`。同一 shape 在两个后端使用相同编号。执行顺序保持为一组参数的所有 M 先完成 ASM 调优和回读，再执行 Triton，因此切换后端时 shape 编号会回到该组起始位置。精度回读显示 `[VALIDATE]`，复用已验证产物显示 `[RESUME]`。详细候选/原生日志仍保存在 `tune.log`、`validation.log` 及 Triton 的 `training_<M>.log` 中。

上述 shape 是小规模合成示例。实际模型应使用每个 rank 已切分后的 tensor 维度：

| 输入 | 含义 |
|---|---|
| `--tokens M1,M2,...` | 精确的 token 数 M，排序去重；17 不会被取整成 16/32 |
| `--inter-dim I` | 单个 gate/up 分支的中间维度 |
| `--model-dim D` | 输入和输出 hidden dimension |
| `--experts E` | 本 rank 的专家数 |
| `--topk K` | 每个 token 选择的本地专家数，1 ≤ K ≤ E |

对应 `X[M,D]`、`W1[E,2I,D]`、`W2[E,D,I]`、路由 `[M,K]`；channel 权重 scale 为 `[E,2I,1]` 和 `[E,D,1]`。不将 I 与 D 对调，也不自动按 TP/EP 再切分。

不指定 `--tokens` 时使用：`1,2,4,8,16,24,32,64,128,256,512,1024,2048,4096,8192,16384,32768`。仅支持单个推理 chunk 的 M ≤ 32768；worker 固定 `TRITON_FUSED_MOE_CHUNK_SIZE=32768`，避免外部环境改变训练/重放语义。更大的实际输入需按推理 chunk 和尾块分别提供 token 值。

## 输入范围与旧 CSV

输入/输出 dtype 为 `fp16` 或 `bf16`，activation 为 gated `silu`。支持以下量化契约；组合是否有可用候选仍取决于实际安装包、设备和 shape，失败会明确报告。

| `--quant-type` | 默认 `[q-size-n,q-size-k]` | 量化与后端范围 |
|---|---|---|
| `no_quant` | `[0,0]` | FP16/BF16，ASM/Triton |
| `int8_w8a8_channel` / `f8_w8a8_channel` | `[0,0]` | INT8/FP8 channel，ASM/Triton |
| `int8_w8a8_block` / `f8_w8a8_block` | `[128,128]` | INT8/FP8 block，ASM/Triton；当前仅支持 128×128 |
| `int4_w4a16` | `[0,64]` | INT4 group；Triton group 32/64/128，`--has-zp 0/1`；ASM 可调 CSV 路径为 group 64、has-zp=1 |
| `int4_w4a8` | `[0,64]` | INT4 group，ASM/Triton，当前要求 group 64、has-zp=1 |
| `int4_w4a8_channel` | `[0,0]` | INT4 channel，Triton；ASM 无对应原生调优/CSV 路径 |
| `int8_w8a16` | `[0,0]` | INT8 权重、FP16/BF16 激活，Triton；ASM 无对应 kernel/CSV |

`--q-size-n` / `--q-size-k` 可以显式指定；不填写时按表中默认值。group/block 的 I、D 必须整除对应 K group；ASM INT4 zero-point 打包另要求 I、D 为 128 的倍数。`--has-zp` 默认仅 INT4 group 为 1，其他为 0。INT4 group 的 reference 使用反量化后的权重，区分权重量化误差与 kernel 误差。

Triton 复用系统 BoltOPs 的原生候选生成、autotuner 和日志解析；INT8 W8A16 使用其普通 GEMM 的 `bf16` 候选模板，实际权重及调用标志始终为 INT8 W8A16。入口负责数据准备、搜索编排和独立精度验证。

`--shuffle 1` 仅影响 ASM 权重布局和 CSV 文件名；Triton 使用同一份未 shuffle 逻辑权重。ASM INT4 不支持此 shuffle 路径；其 group 32 走固定专用 solution，不属于当前 CSV 调优路径。请求不支持的后端时该侧失败，`both` 仍执行另一侧并整体返回非零，不把另一侧成功当成双后端成功。

```bash
# INT8 block，两个后端
python moe_tune/tune_moe.py --backend both --quant-type int8_w8a8_block \
  --tokens 17 --inter-dim 128 --model-dim 256 --experts 4 --topk 2 \
  --output-dir hygon_tmp/int8_block_tune

# W4A16 group 64，两个后端
python moe_tune/tune_moe.py --backend both --quant-type int4_w4a16 \
  --q-size-k 64 --has-zp 1 --tokens 17 --inter-dim 256 --model-dim 7168 \
  --experts 4 --topk 2 --output-dir hygon_tmp/w4a16_tune
```

gfx936 当前 AITER 的 FP8 dtype 为未支持状态，FP8 调优会明确报错，不能生成或安装 FP8 配置。FP8 需设备和实际导入的 AITER 均提供可用 dtype。

当前 gfx938 环境缺少 `hsa/gfx938/w4a8/*.co`，W4A8 group 请使用 `--backend triton`；ASM 会在加载前明确报告二进制缺失。W4A16 ASM 有原生 shape 限制：上述 I=256、D=7168 已通过；I=128、D=256 的测试候选未通过精度，不能将维度可整除视为原生 kernel 支持证明。

本版不编排 TP/EP 通信：`--tp-size` / `--ep-size` 仅接受 1；不接受 FP4、FP8 W8A16、其他 activation、FP32 或非 gated shape。这些会在执行前报错，不会静默退化为其他量化类型。

旧 shape CSV 需要以下列，可直接提供多行：

```csv
quant_type,indtype,token,inter_dim,model_dim,expert,topk,q_size_n,q_size_k
int8_w8a8_channel,torch.float16,1,128,256,4,2,0,0
int8_w8a8_channel,torch.float16,17,128,256,4,2,0,0
int8_w8a8_block,torch.float16,17,128,256,4,2,128,128
int4_w4a16,torch.float16,17,128,256,4,2,0,64
```

```bash
python moe_tune/tune_moe.py --input-file shapes.csv --backend both \
  --output-dir hygon_tmp/model_from_csv
```

相同 shape/type/group/zero-point 契约的多行合并其精确 token 集合；CSV 可增加 `has_zp` 列。`--input-file` 与单 shape/dtype/quant/group 参数互斥；CSV 的 `arch`、旧 `sol_id`、旧计时不决定新任务，架构来自实际设备，配置重新搜索。

兼容旧 ASM shape CSV：block/INT4 group 行的 `q_size_n=q_size_k=0` 按该类型默认 block/group 解释，规范化结果写入 manifest；显式 CLI 的非法 group/block 值仍会被拒绝。

## 产物与断点续跑

输出按 `<output-dir>/<arch>/<case-id>/<backend>/` 隔离，包含：

- `manifest.json`：规范化输入、源文件/扩展哈希、实际 import 路径、GPU 和 compiler capability、状态、配置哈希、验证指标。
- `tune.log`、`tune_result.json`：本次调优输出、候选数量与耗时。ASM 另存每个 M 的候选精度/失败列表；Triton 另存每个 M 的完整原生日志。
- `validation.log`、`validation.json`：新进程通过公开 `aiter_moe` 强制指定该后端，核对原生配置、eager/inplace/CUDA Graph 精度及三轮端到端耗时。Triton 另核对公开调用实际读取的 top/bottom 配置。
- ASM CSV 或 capability 子目录内的两份 Triton JSON。

正常状态是 `validated`；显式安装后是 `installed`。两个后端之一失败，另一后端仍可完成，但整个命令返回非零。探测失败、超时、缺失产物、解析或精度失败也不会被当作成功。

原命令加 `--resume` 可续跑。只有输入、搜索选项、运行环境/源文件/扩展指纹和产物 SHA256 一致才跳过调优。失败、被修改或指纹不符的任务重做；已有结果而未传 `--resume` 时拒绝覆盖，可另选输出目录。

默认 `--search full` 使用原生搜索空间，不限制候选数。`--search smoke` 只检查链路：ASM 前 4 个候选；Triton 一组外层布局、每个 GEMM 最多 4 个候选。smoke 禁止安装，不能视为完整搜索结果或调优提速证据。smoke 无有效候选不代表完整搜索无解；例如本次 INT8 ASM shuffle 的前 4 个候选失败，但 full 能筛选出正确候选，此时应改用 full。

`--warmup`（默认 5）、`--iterations`（默认 20）控制 ASM 候选和公开 API 验证的三轮计时：ASM 候选使用 CUDA Graph 测量 GPU 执行时间，排除 Python 发射间隙；公开 API 同时保存 eager CUDA events 与 CUDA Graph 两套时间；Triton 候选使用其原生 autotuner 的计时策略。`--timeout`（默认 7200 秒）是每个 worker 的上限，包含首次 JIT；大搜索可显式增大。中断/超时仅终止本任务创建的子进程组，不清理其他 MoE 进程。

## 安装到实际运行时

默认不写运行时配置目录。需要使用生成结果时，在同一完整搜索命令上加 `--resume --install-configs`。安装前先校验产物；保留不相关 shape/token/arch 和额外 CSV 列，保存备份及安装收据。

```bash
python moe_tune/tune_moe.py --backend both --tokens 1,16,17,64,256 \
  --inter-dim 128 --model-dim 256 --experts 4 --topk 2 \
  --quant-type int8_w8a8_channel --dtype fp16 \
  --output-dir hygon_tmp/my_model_tune --resume --install-configs
```

当前 AITER 公开 MoE 的实际落点为：

| 后端 | 安装目录及文件 |
|---|---|
| ASM INT8/FP8 channel | AITER `aiter/configs/tuned_fmoe_asm_w8a8_channel.csv`，shuffle 为 `_channel_shuffle.csv` |
| ASM 非量化 | AITER `aiter/configs/tuned_fmoe_asm.csv`，shuffle 为 `_asm_shuffle.csv` |
| ASM INT8/FP8 block | AITER `aiter/configs/tuned_fmoe_asm_w8a8_group.csv`，shuffle 为 `_group_shuffle.csv` |
| ASM INT4 | AITER `aiter/configs/tuned_fmoe_asm_w4a16.csv` / `tuned_fmoe_asm_w4a8_group.csv` |
| Triton | 实际导入的 BoltOPs `boltops/fused_moe/triton/configs/triton_<capability>/`，例如 `triton_3_6` |

Triton 文件例如 `E=4,N=128,arch=gfx936,dtype=int8_w8a8.json` 和 `E=4,N=128,arch=gfx936,dtype=int8_w8a8,is_bottom=True.json`。W8A8 block 在 `.json` 前加 `,block_shape=[128,128]`；INT4 group 沿用原生命名，不包含 group size，由安装来源记录防止冲突。非量化文件无 dtype 片段。当前公开调用消费系统 BoltOPs 路径；把文件复制到 AITER 旧 `aiter/ops/triton/configs/moe` 不会让本路径读取它。

原生配置键有以下限制：

- ASM 查找不区分 FP16/BF16。同一个原生 shape 分组存在另一 dtype 时，安装拒绝覆盖。
- Triton 文件名不区分 D、topk、FP16/BF16；INT4 文件名也不区分 group size 或 zero-point 模式，W4A8 group/channel 会同名。安装通过 `.moe_tune_owners.json` 保存完整契约；不同契约拒绝混写。
- 已有 Triton 文件没有上述来源记录，或在安装后被外部修改时，默认拒绝接管。核对这些文件适用于当前 shape 后，可显式加 `--replace-existing-configs`。此参数不能绕过已有来源记录中的不同 shape 契约。
- 双 JSON 安装使用目录锁、备份和可恢复事务；写入失败会恢复旧文件，进程中断后的下次安装先恢复未完成事务。收据在 `.moe_tune_backups/<id>/receipt.json`。运行时读者不持有安装锁，因此应在推理进程启动前完成安装，并重启已有进程清除配置缓存。

## 验证记录

以下为开发期间的验证记录。纯标准库回归测试脚本单独保存，不随本目录提交；统一入口的调优和精度验证功能不依赖这些测试脚本。

本轮 GPU 回归在 gfx936/bmz 的 `zxw_vllm_0810` 与 gfx938/TJ-yeleng-176.252 的 `zxw_vllm_0901` 中执行，全部使用系统安装的 Triton/BoltOPs。下表为 FP16/BF16、M=17 的 smoke 调优及公开 API 回读；除特别注明，I=128、D=256、E=4、topk=2。

| 范围 | gfx936 | gfx938 |
|---|---|---|
| INT8 W8A8 channel、非量化 | ASM/Triton 通过 | ASM/Triton 通过 |
| INT8 W8A8 block 128×128 | ASM/Triton 通过 | ASM/Triton 通过 |
| FP8 W8A8 channel / block | 明确拒绝：设备 dtype 不支持 | ASM/Triton 通过 |
| INT4 W4A16 group64/zp1，I=256、D=7168 | ASM/Triton 通过 | ASM/Triton 通过 |
| INT4 W4A8 group64/zp1 | ASM/Triton 通过 | Triton 通过；ASM 二进制缺失，明确拒绝 |
| INT4 W4A8 channel、INT8 W8A16 | Triton 通过；ASM 无原生调优路径 | Triton 通过；ASM 无原生调优路径 |
| W4A16 group32/zp0、group64/zp0、group128/zp1，仅 BF16 | Triton 通过 | Triton 通过 |

成功产物均检查原生文件和实际配置命中，并通过公开 API 的 eager/inplace/CUDA Graph 精度重放。系统包隔离测试在 PYTHONPATH 加入真实 BoltOPs 源码及会抛异常的同名假包，两架构新调优与回读仍使用系统包，三个后端选项的 resume 均复用原结果。标准库测试 20 项在本地及两容器通过。

INT8 block 与 W4A16 group64 另做 FP16、M=17 的双后端完整搜索，两架构均通过配置生成、隔离安装和公开 API 回读。每台共 41 项记录：gfx936 31 项通过、10 项预期不支持；gfx938 37 项通过、4 项预期不支持。INT4 group/zp 文件名冲突被正确拒绝；两台默认配置及核对过的已安装 BoltOPs 源文件 hash 保持一致。

完整证据、候选失败记录与来源哈希见工作区 `doc/Unify_and_consolidate_tune_MoE.md` 第 9 节及 `hygon_tmp/unify_moe_quant_20260910/`。前轮使用 BoltOPs 源码的多 M、shuffle 和性能对照保留在规划第 8 节及 `hygon_tmp/unify_moe_impl_20260910/`，不作为本轮系统安装包的验证结果。

此入口面向源码工程，尚未提供独立 wheel console entry。用户未提供客户模型 shape 清单，因此未执行完整模型吞吐或模型性能验收。

## 文件组织与职责

新增功能在 `moe_tune/` 顶层仅保留入口 `tune_moe.py`，辅助实现集中于 `unified_tune/`。原有 `moe_problem.py`、`moe_tuner.py`、`moe_tune_runner.py` 保持原位置和内容。

```text
moe_tune/
├── tune_moe.py                  # 用户命令行入口
├── unified_tune/
│   ├── __init__.py
│   ├── tune_spec.py
│   ├── tune_pipeline.py
│   ├── tune_worker.py
│   ├── tune_dependencies.py
│   ├── tune_artifacts.py
│   └── backends/
│       ├── __init__.py
│       ├── common.py
│       ├── asm_backend.py
│       └── triton_backend.py
└── README.md
```

下表中，除入口外的路径均相对 `unified_tune/`。每个 Python 文件顶部也包含中文用途说明、Hygon 版权与 `SPDX-License-Identifier: MIT`。

| 文件 | 大体作用 |
|---|---|
| `../tune_moe.py` | 解析用户参数，提供 help/dry-run，发起调优流程 |
| `__init__.py` | 声明实现包，初始化时不导入 GPU 依赖 |
| `tune_spec.py` | 规范化 shape/量化/CSV，校验输入，生成任务身份和配置文件名 |
| `tune_pipeline.py` | 编排 worker、超时/中断、日志、续跑和可选安装 |
| `tune_worker.py` | 隔离进程执行环境探测、调优、公开 API 配置回读与精度验证 |
| `tune_dependencies.py` | 限定系统 Triton/BoltOPs 来源，拒绝源码覆盖并记录模块路径 |
| `tune_artifacts.py` | 校验与合并 CSV/JSON，管理锁、冲突、备份和事务恢复 |
| `backends/__init__.py` | 声明后端适配包，按需加载具体实现 |
| `backends/common.py` | 生成量化 tensor/reference，封装公开调用、精度检查及计时 |
| `backends/asm_backend.py` | 查询、验证和计时原生 ASM 候选，生成 CSV |
| `backends/triton_backend.py` | 适配系统 BoltOPs autotuner/parser，生成两阶段 JSON |

目录迁移不改变 CLI 参数和原生配置格式。源码路径/注释变化会改变运行指纹，旧 manifest 的 `--resume` 将按既有规则重新调优；不手工改写旧指纹冒充可直接续跑的结果。
