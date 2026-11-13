# RoPE 单／多 die 验证

`test_rope.py` 验证 `aiter.ops.rope` 的 26 个原生包装接口。`test_rope_triton.py`
单独验证框架使用的两个 THD positions/offsets 双通道原地接口。
脚本使用固定输入和独立 CPU 参考，无预热或性能循环，适合模拟环境。

## 环境与运行

在指定容器中将 `AITER_REPO` 设置为实际源码根目录；必须在 Python 启动前选择模型。

```bash
export ROCM_PATH=/opt/rocm PMD_PATH=/opt/rocm/pmd GPU_ARCHS=gfx946
export HIP_CLANG_PATH=/wksp/llvm-project/build-6.3.3/bin
export PATH=/opt/rocm/bin:$HIP_CLANG_PATH:/opt/hyhal/bin:$PATH
export LD_LIBRARY_PATH=/opt/rocm/lib:/opt/rocm/pmd:${LD_LIBRARY_PATH:-}
export PYTHONPATH="$AITER_REPO" AITER_ENABLE_SUPERNODE_AR=0 MAX_JOBS=3
export GPU_ARGS="['--num-gpu=1']" GPU_DFLAGS="['StatLog']"
unset AITER_JIT_DIR AITER_REBUILD HIP_VISIBLE_DEVICES ROCR_VISIBLE_DEVICES CUDA_VISIBLE_DEVICES
test_py="$AITER_REPO/op_tests/gfx946_tests/rope/test_rope.py"
```

每条命令在不同工作目录执行，保留各自的 `m5out`、日志和 JSON：

```bash
GPU_CHIP=sb python "$test_py" --suite build --rebuild --json build.json
GPU_CHIP=sb python "$test_py" --suite all --expect-xcds 1 --json single.json
GPU_CHIP=sbx2 python "$test_py" --suite all --expect-xcds 2 --json dual.json
GPU_CHIP=sbx2 python "$test_py" --suite route --expect-xcds 2 --die-mode linear --chunk 2 --json linear2.json
GPU_CHIP=sbx2 python "$test_py" --suite route --expect-xcds 2 --die-mode off --json off.json
```

`--suite quick` 是默认的五例冒烟；`full` 为全部数值矩阵；`all` 追加非法启动参数检查。
`--list` 不加载 GPU；`--case rope_cached_2c_fwd_inplace` 单独运行指定用例。
首次构建三个模板模块可能耗时数分钟，后续使用同一份模块运行，避免反复编译。

真实 gfx936/gfx938：使用对应工具链和选定的空闲设备，清除模型变量，设置
`GPU_ARCHS`，运行以下命令，不传 `--expect-xcds`：

```bash
python "$test_py" --require-arch gfx938 --suite all --rebuild --json hardware.json
```

## 如何判断多 die

原生接口支持 `AITER_ROPE_DIE_MODE=auto|off|linear`，默认 `auto`；
`AITER_ROPE_DIE_CHUNK` 默认为 1，必须为正；`AITER_ROPE_DIE_MASK` 目前仅接受 0。
测试命令行统一设置这些值，并开启 `AITER_ROPE_LOG_LAUNCH`。
`linear` 要求实际 gfx946 且至少两个 XCD。`off` 使用普通启动 API，不能证明单 die。

脚本记录实际架构、HSA XCD 数、源码／模块哈希和逐例输出摘要；完成全部检查才写 `PASS`。
数值通过与跨 die 执行应分别验收：根据 `DUT_BEGIN`/`DUT_END` 和 launch 日志定位 dispatch，
读取对应 `m5out/0/<dispatch>/stats.txt` 中每个 XCD 的 `completedWGs`。
各 XCD 之和必须等于完整三维 grid 的 workgroup 总数；至少两个 XCD 的计数非零才说明跨 die。
单 token 的 `auto` 普通路由不要求跨 die，强制 linear 也受 workgroup 数及 chunk 限制。

## 数值契约

- 覆盖常规／缓存、一／双通道、前向／反向／原地、位置／偏移、THD、2D 的 26 个接口。
- 验证 NEOX/GPT-J、频率复用、部分旋转和未旋转区间、不同 Q/K 头数、跨步输入、转置输出、三种浮点类型及空输入。
- 反向参考使用 CPU 自动微分，完整频率允许不对称，避免误用“角度取负”公式。
- 检查原地包装返回 `None`、输入存储保护区、缓存及索引不变；原地输出与参考逐元素比较。
- SBHD 输入是 `[S,B,H,D]`；THD 使用 int32 `cu_seqlens`；positions/offsets 是 int64 `[S,B]`。
- 2D 输入是 `[B,Himage*Wimage,Hheads,D]`，缓存是 `[1,Himage或Wimage,1,F]`；不复用时 `F=D/2`，复用时 `F=D/4`，`D` 应可被 4 整除。

测试仅使用合法形状和索引。现有原生接口未完整验证任意非法 tensor 元数据／索引内容；
不能把启动参数拒绝检查理解为全面输入安全保证。没有验收 Graph、完整模型、超大尺寸或性能。

## Triton 两入口

指定模型容器的默认工具链在内建函数类型校验阶段失败。以下为本轮实际通过的配置：

```bash
export TRITON_HIP_CLANG_PATH=/wksp/llvm-project/build-6.3.3/bin/clang
export TRITON_CACHE_DIR="$PWD/triton_cache"
triton_py="$AITER_REPO/op_tests/gfx946_tests/rope/test_rope_triton.py"
GPU_CHIP=sb python "$triton_py" --disable-buffer-ops --expect-xcds 1 --json triton_single.json
GPU_CHIP=sbx2 python "$triton_py" --disable-buffer-ops --expect-xcds 2 --json triton_dual.json
```

该脚本不使用原生 launch policy，单独记录编译器版本、缓存配置、数值结果及异常。
`--disable-buffer-ops` 用于编译器兼容性诊断，改用普通指针访存；指定工具链时使用
`TRITON_HIP_CLANG_PATH` 并为 `TRITON_CACHE_DIR` 选择独立目录。
诊断配置通过不能说明默认工具链通过，也不能由原生接口结果推断 Triton 的跨 die 行为。
两个硬件回归环境的默认配置均通过，无需上述模型兼容性开关。
