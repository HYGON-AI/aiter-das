# W8A8 GEMM gfx946 测试

`test_w8a8_gemm.py` 只依赖标准库、AITER、Torch 和当前环境的 HIP/HSA 软件包。不导入临时脚本、不读取历史结果；`--json` 可省略，指定时只写本轮结果。首次构建需要仓库内完整 CK 子模块和 HIP 编译器。每个数值用例仅调用一次公开算子，没有 warmup、Graph 或性能循环。

## 架构支持与混合架构构建

`gemm_a8w8_CK` 的 INT8 路径支持 gfx936；本次 FP8 rowwise、block128 和 MX32 路径使用原生 16×16 FP8 MMAC，仅支持 gfx92a、gfx938、gfx946。gfx936 上调用非空 FP8 GEMM 会明确报错，不做隐式精度转换。空 M 保持返回空输出的约定。gfx92a 为源码支持范围，本文未提供该架构的运行验证。

`GPU_ARCHS='gfx936;gfx938'` 构建会保留 gfx936 INT8 和 gfx938 INT8/FP8，FP8 实例按设备编译目标隔离。运行时使用输入 Tensor 的实际设备检查支持范围，不以 `GPU_ARCHS` 或当前设备代替输入设备。

从仓库根目录执行下面的 gfx936 回归，覆盖 16 个 INT8 数值用例，以及公开接口和 native 接口的 12 个 FP8 拒绝用例。修改源码后需先重新构建两个 JIT 模块；也可指定一个新的 `AITER_JIT_DIR` 使用独立缓存。

```bash
GPU_ARCHS='gfx936;gfx938' PYTHONPATH="$(pwd)" \
  python op_tests/gfx946_tests/w8a8_gemm/test_w8a8_arch.py
```

2026-10-29 回归结果：DTK 26.04 下两个模块的 `gfx936;gfx938` 混合构建通过；gfx936 上述 28 项通过，gfx938 的 `full`、`optimized`、`contracts` 共 80 项通过。gfx946 使用 HIP 6.3.3 重新构建，Perf Model 单 die quick 8 项、双 die quick 8 项及双 die FP8 route 6 项均通过。这些结果验证编译与正确性，不代表 gfx946 实机性能。

## Perf Model

在已配置 PyTorch/HIP 和 Perf Model 的环境中，从 AITER 仓库根目录执行。先按实际安装环境设置 `ROCM_PATH`（HIP SDK 根目录）和 `PMD_PATH`（Perf Model 运行库目录）；下面命令沿用这两个环境变量。

```bash
REPO="$(pwd)"
TEST="$REPO/op_tests/gfx946_tests/w8a8_gemm/test_w8a8_gemm.py"
: "${ROCM_PATH:?请先设置 HIP SDK 根目录}"
: "${PMD_PATH:?请先设置 Perf Model 运行库目录}"
export ROCM_PATH PMD_PATH
export LD_LIBRARY_PATH="$ROCM_PATH/lib:$PMD_PATH:${LD_LIBRARY_PATH:-}"
export PYTHONPATH="$REPO" GPU_ARCHS=gfx946 GPU_DFLAGS='[]'
unset AITER_JIT_DIR CK_DIR AITER_REBUILD GPU_ARGS
RUN=$(mktemp -d)
cd "$RUN"

# 单 die：首次缺少模块时自动构建；源码改变后加 --rebuild
GPU_CHIP=sb python "$TEST" --suite quick --expect-xcds 1
GPU_CHIP=sb python "$TEST" --suite full --expect-xcds 1
GPU_CHIP=sb python "$TEST" --suite single-reject --expect-xcds 1
GPU_CHIP=sb python "$TEST" --suite contracts --expect-xcds 1

# 双 die
GPU_CHIP=sbx2 python "$TEST" --suite full --expect-xcds 2
GPU_CHIP=sbx2 python "$TEST" --suite multi --expect-xcds 2
GPU_CHIP=sbx2 python "$TEST" --suite invalid --expect-xcds 2
```

工作目录只接收模拟器新产生的输出，可替换为任意可写目录。`GPU_CHIP` 仅在进程初始化前选择模拟模型；测试初始化设备后移除它，再调用算子。`--expect-xcds` 查询并断言 HSA 返回的 GPU agent XCD 数，不用于配置模型。多 GPU 环境要求查询到的 GPU agents 均满足该断言；native launcher 使用当前选中 HIP device 的 numXcc，遵守 HIP_VISIBLE_DEVICES 映射。

## 分别测试与覆盖范围

`--ops rowwise` 检查 `gemm_a8w8_CK`；`--ops blockscale` 检查 FP32 scale 的 128 分组；`--ops mx` 检查 E8M0 scale 的 32 分组。后两者均调用 `gemm_a8w8_blockscale`。可用 `--dtypes bf16`、`--qdtypes fp8` 缩小矩阵；qdtypes 只控制 rowwise。

| 集合 | 默认用例数 | 内容 |
|---|---:|---|
| quick | 8 | INT8/FP8 rowwise，FP8 block128、MX32；FP16/BF16 输出 |
| full | 32 | M/N/K 尾块、单/多 K tile、零输入、signed FP8、bias、FP32/输出 dtype scales、非默认 stream、out 保护区与 dtype 分配形式 |
| optimized | 32 | 覆盖优胜 tile 调度、M=16/64/512、短 K 与同时 padding 的 M/N/K |
| multi | 24 | 单 TG auto、8 TG linear/chunk2、off |
| route | 16 | 每次 8 TG，linear/chunk1/2 |
| invalid | 15 | 三种量化路径的非法 mode/chunk/mask |
| single-reject | 3 | 单 XCD 明确拒绝 linear |
| contracts | 16 | 形状/scale/output dtype/非连续布局拒绝、空 M、rowwise splitK 拒绝 |

结果应为 `RESULT PASS N cases`。JSON（如指定）的 `complete` 必须为 true；检查中途失败不会写成完成。数值以 CPU FP32 参考、转换到目标 dtype 后逐元素检查，FP16 rtol=0.002、BF16 rtol=0.02，atol=0.02，不允许按错误比例放行。

## 路由与硬件回归

数值通过、HIP API 成功和设备有多个 XCD，均不能单独证明各 XCD 执行了 TG。路由采集须另设 `GPU_DFLAGS="['StatLog','TT0']"`，运行 `--suite route --dtypes bf16 --qdtypes fp8`，检查同一次 dispatch 各 XCD 的 completedWGs。日志是本轮输出，测试本身不需要统计解析器。

在已配置 PyTorch/HIP 的 gfx938 真机环境中可使用同一个测试：清除 GPU_CHIP，选择空闲 HIP_VISIBLE_DEVICES，执行 `--require-arch gfx938 --suite full`，首次用 `--rebuild`。使用真机环境对应的 HIP SDK 配置，不要套用 Perf Model 的运行库设置。

当前实现按连续二维布局处理 A[M,K]、B[N,K]。rowwise scale 包含 M/N 个元素；bias 包含 N 个输出 dtype 元素。block128 为 FP8 E4M3FN + FP32 `[M,ceil(K/128)]`、`[ceil(N/128),ceil(K/128)]`；MX32 为 FP8 E4M3FN + E8M0 `[M,ceil(K/32)]`、`[ceil(N/32),ceil(K/32)]`，兼容 uint8 存储和提供该 dtype 的 Torch。splitK 目前仅接受 0；正值明确报错，框架清单的调用使用默认 0。Graph、完整框架模型、gfx946 真机性能不包含在这些 eager 测试中。

## gfx938 硬件性能比较

`bench_w8a8_gemm.py` 同样只依赖标准库、Torch、AITER。默认 8 组 (M,N,K)，每组检查 INT8/FP8 rowwise、block128、MX32，统一 BF16 输出；不在 Perf Model 上运行。

在 gfx938 环境选择空闲 GPU 后，从 AITER 仓库根目录执行：

```bash
unset GPU_CHIP AITER_REBUILD AITER_JIT_DIR CK_DIR CK_W8A8_LOG_LAUNCH CK_W8A8_DIE_MODE
export GPU_ARCHS=gfx938 PYTHONPATH="$(pwd)"
python op_tests/gfx946_tests/w8a8_gemm/bench_w8a8_gemm.py
# 可缩小矩阵；--json 仅写输出，可省略
python op_tests/gfx946_tests/w8a8_gemm/bench_w8a8_gemm.py --ops row_fp8 --shape 16,4096,4096 --rounds 7
```

比较口径：torch.mm 使用预先反量化的 BF16 A/B；计时不含输入生成、量化、反量化、JIT 和正确性检查。AITER 计时含其 scale 计算和 MX scale 解码。BF16 baseline 的输入变换在此有界数据上精确，不将 FP8/INT8 直接输入 torch.mm 当作同契约基线。

两种计时均同卡、交替 A/B 顺序，默认 5 轮保留逐轮结果和中位数。eager_wall 是批量公开接口调用及同步的主机 wall time；graph_gpu 是每张 Graph 含16次公开接口调用、重放后 HIP event 时间除以总调用数。两者均不刷新 cache；Graph 检查输出，以及将输入改为0再恢复后的重放。正确性使用 GPU FP32 mm 参考转 BF16，rtol=0.02、atol=0.02。

JSON speedup 定义为 torch.mm/AITER，>1 才表示 AITER 更快。Graph 结果仅对应所选 gfx938 硬件与测试矩阵，不证明 gfx946 Graph 支持；此 benchmark 也不包含完整量化流水线或模型吞吐。

## 调优分支回归

`test_w8a8_gemm.py --suite optimized` 使用小 K 覆盖 M=16/64/512 和
M/N/K 同时需要 padding 的 shape，验证 FP16/BF16、INT8/FP8、bias、
输出 dtype 的 scale、独立 stream 和输出边界。它不包含性能循环，适合 Perf Model。
与 `--suite full` 一起运行，分别覆盖新 tile 分支和原有接口边界。

