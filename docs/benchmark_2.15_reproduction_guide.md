# 2.15 NPU Benchmark 流水迁移与复现手册

本文用于在另一台 Ascend NPU 服务器上复现当前 2.15 Benchmark 流水。目标是让执行者可以从零完成：

1. 创建不污染宿主机和其他容器的运行环境；
2. 准备 PyTorch、torch_npu、torchvision、Triton-Ascend 和 CANN 9.2.0；
3. 拉取 PTA、BenchmarkForge、BenchBoard 以及官方 pytorch/benchmark 仓；
4. 准备 TorchBench、HuggingFace、TIMM 所需的数据和离线缓存；
5. 使用 daily / weekly 配置启动 DVM 或 Triton-Experimental 流水；
6. 将 raw data 转换为网页 JSON，并生成脱敏失败摘要。

本文不包含密码、Git token、代理密码或私有地址。所有尖括号内容必须替换成目标机器的实际值。

## 1. 目标目录

建议目标目录如下。用户名、工作盘和 CANN 挂载路径可以不同，但目录职责不要混在一起。

    /home/<user>/workspace/BenchmarkForge/        # 流水架构、配置、执行脚本
    /home/<user>/workspace/BenchBoard/            # 数据处理和看板数据脚本
    /home/<user>/workspace/pytorch/               # Ascend/pytorch 源码
    /home/<user>/workspace/torchbench/             # 官方 pytorch/benchmark 仓
    /home/<user>/benchmark/torchbenchmark/data/.data/
                                                    # 共享模型数据和样例
    /home/<user>/benchmark/cache/huggingface/      # HF 权重和 tokenizer
    /home/<user>/benchmark/cache/torch/            # Torch Hub / torchvision / TIMM 权重
    /home/<user>/benchmark/cache/pip/              # pip 缓存，可选

    <BenchForge>/board_file/raw_data/<YYYYMMDD>/   # 原始 log、profile 和模型结果
    <BenchForge>/board_file/web_data/<YYYYMMDD>/   # 结构化网页 JSON
    <BenchForge>/board_file/error_data/<YYYYMMDD>/ # 脱敏错误摘要
    <BenchForge>/board_cache/<YYYYMMDD>/            # 每模型独立编译缓存

以下内容不要放入 Git：

- raw_data、profile、torch_compile_debug、torchinductor_cache；
- HuggingFace、TIMM、Torch Hub 权重和大型数据集；
- 容器 tar、conda 环境目录；
- 包含服务器绝对路径、用户名、token、密码或代理凭据的文件。

## 2. 必须准备的仓库

### 2.1 PTA 主仓

用途：

- 提供 benchmarks/torchbench 下的 Ascend runner；
- 提供 torch_npu 源码和 2.15 wheel 编译入口；
- 提供 Ascend 侧的 common.py、torchbench.py、npu_support.py、profiler.py 等适配文件。

    cd /home/<user>/workspace
    git clone https://gitcode.com/Ascend/pytorch.git pytorch
    cd pytorch
    git fetch --all --tags
    git rev-parse HEAD
    git log -1 --oneline

2.15 必须记录实际 PTA commit。若使用已经编译好的 torch_npu wheel，源码 commit 必须和 wheel 文件名或编包记录一致，不能只根据 torch_npu.__version__ 猜 commit。

### 2.2 BenchmarkForge

用途：当前规范化流水架构，包括模型集合、daily/weekly 启动入口、并发调度、结果处理和迁移脚本。

    cd /home/<user>/workspace
    git clone https://github.com/YTLiu-bury/BenchmarkForge.git BenchmarkForge

如果该仓库只保存流水脚本而没有 third_party/benchmarks/torchbench，不要从其他服务器复制旧的运行产物。按下节重新准备 benchmark，并把 PTA 侧 runner 文件放到对应位置。

### 2.3 BenchBoard

用途：运行结果处理和网页数据生成。运行所需的核心文件包括：

    auto_board/board_paths.py
    auto_board/extension_utils.py
    auto_board/run_common.py
    auto_board/run_model.py
    auto_board/process_raw_data.py
    auto_board/process_raw_error.py
    auto_board/process_raw_log.py
    auto_board/auto_board_run.sh
    auto_board/run_daily.yaml
    auto_board/run.yaml
    auto_web/aggregate_backend_daily_data.py
    core/local_paths.py

    cd /home/<user>/workspace
    git clone https://gitcode.com/LucciC/BenchBoard.git BenchBoard

如果 BenchBoard 仓不可访问，只迁移上面列出的代码和 YAML，不要把网站服务器上的历史 JSON、profile 和原始日志全部复制到新机器。

### 2.4 官方 PyTorch Benchmark

PTA runner 不是完整替代官方 benchmark。benchmarks/torchbench/benchmark 仍需从官方仓准备，并固定到已验证的 commit：

    fb14629994956c16d27c7a9940c5f081afbf68dc

    cd /home/<user>/workspace/BenchmarkForge/third_party/benchmarks/torchbench
    git clone https://github.com/pytorch/benchmark.git benchmark
    cd benchmark
    git fetch --depth 1 origin fb14629994956c16d27c7a9940c5f081afbf68dc
    git checkout fb14629994956c16d27c7a9940c5f081afbf68dc

不要只停在远端默认分支。新旧 benchmark 版本差异会影响 torchbench.yaml 元数据读取和模型特化逻辑。

### 2.5 Triton-Ascend

用途：Triton-Experimental 后端运行时。当前 2.15 环境使用 3.6 系列，优先复用已经验证、且与 Python ABI 和 CPU 架构匹配的 wheel，例如：

    triton_ascend-3.6.0+git90f5bd86-cp310-cp310-linux_aarch64.whl

先确认目标 Python 和架构：

    python --version
    python -c 'import platform; print(platform.machine())'

如果没有 wheel，再拉仓编译：

    cd /home/<user>/workspace
    git clone https://github.com/triton-lang/triton-ascend.git triton-ascend
    cd triton-ascend
    git log -1 --oneline

不能把 x86_64 wheel 装到 AArch64，也不能把 cp311 wheel 装到 Python 3.10。

## 3. 容器和 CANN 9.2.0

宿主机必须已经安装与硬件匹配的 Ascend 驱动和固件。容器不能替代宿主机驱动。

    uname -m
    docker version
    npu-smi info
    test -f <CANN_HOME>/set_env.sh

建议把宿主机 CANN 只读挂载进容器。先确认设备存在：

    for dev in /dev/davinci* /dev/devmm_svm /dev/hisi_hdc; do
        [ -e "$dev" ] && echo "available: $dev"
    done

容器启动模板如下，不要原样执行；不存在的设备不要硬写：

    docker run -dit \
      --name ascendforge_ci \
      --restart unless-stopped \
      --network host \
      --ipc host \
      --shm-size 32g \
      --device /dev/davinci0 \
      --device /dev/davinci1 \
      --device /dev/davinci2 \
      --device /dev/davinci3 \
      --device /dev/devmm_svm \
      --device /dev/hisi_hdc \
      -v /home/<user>:/home/<user> \
      -v <CANN_HOME>:/usr/local/Ascend/cann-9.2.0:ro \
      -e ASCEND_VISIBLE_DEVICES=0,1,2,3 \
      <ARM64_BASE_OR_ASCEND_IMAGE> \
      /bin/bash

说明：

- network host 只复用宿主机网络命名空间，不保证外网可用；
- shm-size 32g 是共享内存大小，不是 NPU HBM；
- :ro 表示容器不能修改宿主机 CANN；
- 宿主机 CANN 路径可变，但容器内统一使用 /usr/local/Ascend/cann-9.2.0；
- 不要直接把宿主机 conda 目录当作容器环境，除非 ABI、glibc、Python 和动态库完全一致。

进入容器：

    docker exec -it ascendforge_ci /bin/bash
    mkdir -p /etc/ld.so.conf.d
    source /usr/local/Ascend/cann-9.2.0/set_env.sh
    which msprof || true
    npu-smi info

如果精简镜像出现 ldconfig cache warning，可执行：

    mkdir -p /etc/ld.so.conf.d
    touch /etc/ld.so.cache
    ldconfig || true
    source /usr/local/Ascend/cann-9.2.0/set_env.sh

最终以 npu-smi、Python import 和 compile smoke 为准。

## 4. Python 3.10 / 2.15 环境

当前 2.15 迁移优先按 Python 3.10 处理，因为已验证的 Triton-Ascend wheel 是 cp310。若实际 wheel 是 cp311 或 cp312，所有 Python 命令必须统一换成对应版本。

    conda create -n lyt215_ci python=3.10 -y
    conda activate lyt215_ci
    python -m pip install -U pip setuptools wheel

把核心 wheel 放到目标机器可读目录，例如 /home/<user>/wheels/215。安装顺序：

1. 与目标 torch ABI 匹配的 torch 2.15 +cpu；
2. 与相同 torch commit 匹配的 torch_npu 2.15；
3. 对应版本的 torchvision；
4. triton-ascend 3.6 系列；
5. 其他 Python 依赖。

    WHEEL_DIR=/home/<user>/wheels/215
    python -m pip install --force-reinstall --no-deps "$WHEEL_DIR"/torch-2.15*cp310*.whl
    python -m pip install --force-reinstall --no-deps "$WHEEL_DIR"/torch_npu-2.15*cp310*.whl
    python -m pip install --force-reinstall --no-deps "$WHEEL_DIR"/torchvision*cp310*.whl
    python -m pip install --force-reinstall --no-deps "$WHEEL_DIR"/triton_ascend-3.6.0*cp310*.whl

不要让 pip 自动升级 torch，也不要先装不匹配的 torchvision 再补 torch_npu。三者必须来自同一套已验证环境。

### 4.1 Benchmark 依赖

    python -m pip install \
      numpy pandas scipy pillow pyyaml requests \
      packaging psutil filelock fsspec networkx sympy \
      huggingface-hub transformers tokenizers safetensors \
      timm opencv-python-headless iopath \
      tensorboardx tqdm regex sentencepiece

按实际模型集合补充：

    python -m pip install \
      torchmultimodal accelerate datasets diffusers peft \
      pyarrow blobfile ftfy portalocker kaldi-io lxml

依赖版本以 2.15 源环境 pip freeze 为准。不要把 2.10 环境的完整 freeze 文件覆盖到 2.15；重点检查 transformers、tokenizers、safetensors、timm、numpy、scipy 和 torchvision。

    python -m pip check
    python -m pip list | egrep 'torch|torchvision|transformers|tokenizers|timm|triton|numpy|scipy|pillow|pyyaml'

如果需要从源机器完整盘点：

    python -m pip freeze > /tmp/bench_215_pip_freeze.txt

目标机只安装缺失项，不要覆盖核心 torch 包。

## 5. 本地路径配置

创建 BenchBoard/user_info/local_paths.yaml，不能继续使用源机器用户名路径：

    paths:
      dataset_root: /home/<user>/benchmark
      torchbench_data_path: /home/<user>/benchmark/torchbenchmark/data/.data
      conda_root: /home/<user>/miniconda3
      cann_info_file: /usr/local/Ascend/cann-9.2.0/aarch64-linux/ascend_toolkit_install.info

也可以用环境变量覆盖：

    export BENCHBOARD_DATASET_ROOT=/home/<user>/benchmark
    export BENCHBOARD_TORCHBENCH_DATA_PATH=/home/<user>/benchmark/torchbenchmark/data/.data
    export BENCHBOARD_CONDA_ROOT=/home/<user>/miniconda3

验证：

    cd /home/<user>/workspace/BenchBoard
    python core/local_paths.py get torchbench_data_path

迁移时必须检查 `auto_board/auto_board_run.sh` 顶部的环境变量。旧版本文件可能仍包含源机器路径，例如旧的 `TORCHBENCH_DATA_PATH` 或固定的 `HF_ENDPOINT`。目标机器应改成参数化形式：

    export TORCHBENCH_DATA_PATH="${TORCHBENCH_DATA_PATH:-/home/<user>/benchmark/torchbenchmark/data/.data}"
    export HF_ENDPOINT="${HF_ENDPOINT:-https://<approved-hf-endpoint>}"

如果当前脚本仍直接写死 `/home/l00971669/...`，必须先替换成上面的形式，不能依赖目标机碰巧创建同名目录。

## 6. 数据、权重和离线缓存

至少检查以下数据。weekly 全量建议统一准备：

    $TORCHBENCH_DATA_PATH/coco2017-minimal/
    $TORCHBENCH_DATA_PATH/coco128/
    $TORCHBENCH_DATA_PATH/maml_omniglot/batch.pt
    $TORCHBENCH_DATA_PATH/obs.pkl
    $TORCHBENCH_DATA_PATH/pizza.jpg

Detectron2、SAM、doctr、MAML、LearningToPaint 等模型可能从仓内固定路径读取资源，要结合目标 benchmark 版本的模型代码检查，不能只设置环境变量。

    find "$TORCHBENCH_DATA_PATH" -maxdepth 3 -type f | sort | head -200
    du -sh "$TORCHBENCH_DATA_PATH"

如果新 benchmark 检查仓内路径，创建软链，不复制第二份数据：

    cd /home/<user>/workspace/BenchmarkForge/third_party/benchmarks/torchbench
    mkdir -p benchmark/torchbenchmark/data/.data
    ln -sfn "$TORCHBENCH_DATA_PATH/coco2017-minimal" \
      benchmark/torchbenchmark/data/.data/coco2017-minimal

固定缓存变量：

    export XDG_CACHE_HOME=/home/<user>/benchmark/cache
    export HF_HOME="$XDG_CACHE_HOME/huggingface"
    export TRANSFORMERS_CACHE="$HF_HOME/hub"
    export HUGGINGFACE_HUB_CACHE="$HF_HOME/hub"
    export TORCH_HOME="$XDG_CACHE_HOME/torch"
    export TORCHINDUCTOR_CACHE_ROOT=/home/<user>/benchmark/cache/torchinductor
    export PIP_CACHE_DIR="$XDG_CACHE_HOME/pip"
    mkdir -p "$HF_HOME" "$TORCH_HOME" "$TORCHINDUCTOR_CACHE_ROOT" "$PIP_CACHE_DIR"

常见缓存：

- HuggingFace：HF_HOME/hub；
- Torch Hub、torchvision、部分 TIMM：TORCH_HOME/hub/checkpoints；
- 旧缓存：~/.cache/huggingface、~/.cache/torch；
- 编译缓存：board_cache/<date>/.../workspace/，不要跨 torch_npu 版本直接复用。

缓存迁移时排除 profile 和 compile debug：

    rsync -avP \
      --exclude='*.log' \
      --exclude='profile*/' \
      --exclude='torch_compile_debug/' \
      /source/cache/huggingface/ \
      <user>@<target>:/home/<user>/benchmark/cache/huggingface/

不要一开始就设置 HF_HUB_OFFLINE=1。先用最小模型确认缓存可读，再设置：

    export HF_HUB_OFFLINE=1
    export TRANSFORMERS_OFFLINE=1

缺文件时说明缓存不完整，应补缓存或暂时关闭离线模式，不能把离线失败误判成后端失败。

### 6.1 网络策略

优先级：

1. 复用已验证的离线缓存；
2. 使用公司批准的代理或镜像；
3. 宿主机下载后传入容器；
4. 最后才允许流水运行时访问外网。

代理只通过环境变量传入，不写死 IP：

    export HTTP_PROXY=http://<approved-proxy-host>:<port>
    export HTTPS_PROXY=http://<approved-proxy-host>:<port>
    export ALL_PROXY=http://<approved-proxy-host>:<port>
    export NO_PROXY=localhost,127.0.0.1,<internal-domain>

容器启动时用 -e HTTP_PROXY -e HTTPS_PROXY -e ALL_PROXY -e NO_PROXY 传入。代理变化后重启容器即可，不要把代理写入镜像层。

不要把 --no-check-certificate 或关闭 TLS 校验作为长期方案。证书问题应安装正确 CA；未知下载域名和不明代理不要加入流水。

## 7. 运行前验证

进入容器后：

    conda activate lyt215_ci
    source /usr/local/Ascend/cann-9.2.0/set_env.sh
    cd /home/<user>/workspace/BenchmarkForge

### 7.1 版本栈

    python - <<'PY'
    import os
    import platform
    import torch
    import torch_npu
    import torchvision
    print("python:", platform.python_version())
    print("machine:", platform.machine())
    print("torch:", torch.__version__)
    print("torch_npu:", torch_npu.__version__)
    print("torchvision:", torchvision.__version__)
    print("npu_count:", torch_npu.npu.device_count())
    print("backend_env:", os.environ.get("TORCHINDUCTOR_NPU_BACKEND"))
    PY

### 7.2 DVM 和 Triton-Experimental compile smoke

不要导入已经废弃的 npu_inductor。当前入口是 torch.compile(..., backend="inductor")，通过环境变量和 benchmark 参数选择 NPU backend：

    for backend in dvm triton_experimental; do
      echo "===== $backend ====="
      ASCEND_RT_VISIBLE_DEVICES=0 \
      TORCHINDUCTOR_NPU_BACKEND="$backend" \
      python - <<'PY'
    import torch
    import torch_npu
    x = torch.randn(16, 16, device="npu")
    def fn(x):
        return (x + 1).relu()
    y = torch.compile(fn, backend="inductor")(x)
    print("compile ok:", y.shape, y.device)
    PY
    done

失败时先检查 torch/torch_npu 是否匹配、torch._inductor 是否完整、Triton wheel ABI、CANN 环境是否混用，以及是否从未编译源码目录导入 torch_npu。

### 7.3 单模型验证

    python auto_board/run_model.py --help
    bash auto_board/auto_board_run.sh --help

    python auto_board/run_model.py \
      --type bench \
      --backend triton_experimental \
      --config run_daily.yaml \
      --date 20261019 \
      --package-tag 2150 \
      --extension default \
      --only resnet50 \
      --timeout 1500

确认生成：

    board_file/raw_data/20261019/benchmark/2150/triton_experimental/default/resnet50/board_log/
    board_file/raw_data/20261019/benchmark/2150/triton_experimental/default/resnet50/profile/
    board_cache/20261019/benchmark/2150/triton_experimental/default/resnet50/workspace/

## 8. 启动 daily / weekly

配置文件：

| 文件 | 用途 |
|---|---|
| auto_board/run_daily.yaml | daily 40 模型，快速反馈，包含 Bench、HuggingFace、Timm |
| auto_board/run.yaml | weekly/internal 全量配置，包含更完整的 154 模型和 LLM |
| auto_board/run_community_106.yaml | 只对齐社区 106 模型的外部口径 |
| user_info/local_paths.yaml | 目标机路径，不能带源机器绝对路径 |

YAML 中：

- dir：suite 的工作目录；
- command：torchbench.py、huggingface.py 或 timm_models.py；
- args：例如 backend=inductor、iterations=50；
- flags：例如 accuracy、train、enable-profiler、disable-aclgraph；
- overrides：单模型 inference-only、train-only、batch size、tolerance 或其他特化。

当前默认流水是 dynamic off、ACLGraph off。不要删除 disable-aclgraph 后直接对比历史数据。

### 8.1 Daily

    DATE=20261019
    PACKAGE_TAG=2150

    ASCEND_RT_VISIBLE_DEVICES=0,1 \
      bash auto_board/auto_board_run.sh \
      -v "$PACKAGE_TAG" -t bench -b dvm -d "$DATE" \
      -c run_daily.yaml --extension default

    ASCEND_RT_VISIBLE_DEVICES=2,3 \
      bash auto_board/auto_board_run.sh \
      -v "$PACKAGE_TAG" -t bench -b triton_experimental -d "$DATE" \
      -c run_daily.yaml --extension default

HuggingFace 或 TIMM 运行时，把 -t bench 换成 -t huggingface 或 -t timm。

注意脚本取舍：

- `auto_board/run_model.py` 是当前单模型和 suite 执行入口；
- `auto_board/auto_board_run.sh` 负责执行、处理 raw data 和错误摘要，但必须先清理源机器硬编码路径；
- `auto_board/remote_tasks.sh` 是旧版本多版本任务脚本，里面可能固定 source 旧 CANN 路径和 2.7/2.9/2.10 版本，不能直接用于 2.15；
- BenchmarkForge 中如果存在 `torchbench_pipeline/daily_pipeline.sh`，先阅读它的 build、environment 和 benchmark 三个阶段。已经有 2.15 wheel 时使用跳过编包的选项，不要重复编包或覆盖现有环境；
- 如果新架构入口尚未适配 2.15，先用本文的 `run_model.py` + `run_daily.yaml` / `run.yaml` 跑通，再迁移到更高层 wrapper。

### 8.2 Weekly 154 模型

    DATE=20261019
    PACKAGE_TAG=2150

    ASCEND_RT_VISIBLE_DEVICES=0,1 \
      bash auto_board/auto_board_run.sh \
      -v "$PACKAGE_TAG" -t bench -b dvm -d "$DATE" \
      -c run.yaml --extension default

    ASCEND_RT_VISIBLE_DEVICES=2,3 \
      bash auto_board/auto_board_run.sh \
      -v "$PACKAGE_TAG" -t bench -b triton_experimental -d "$DATE" \
      -c run.yaml --extension default

如果 auto_board_run.sh 对 2.15 版本号解析不适配，直接调用 run_model.py，并使用 --package-tag 2150。版本目录只是产物分层标签，实际 torch_npu commit 必须另外记录。

### 8.3 监控

    npu-smi info
    ps -ef | grep -E 'run_model|torchbench|huggingface|timm_models' | grep -v grep
    du -sh board_file/raw_data/<DATE> board_cache/<DATE> 2>/dev/null
    find board_file/raw_data/<DATE> -name '*.log' | wc -l

单模型默认 timeout 为 1500 秒。不要用无限增大 timeout 掩盖卡死；先区分网络等待、数据加载、OOM、编译和后端执行问题。

## 9. 结果处理和网页 JSON

流水完成后，在同一个 conda 环境执行：

    DATE=20261019
    PACKAGE_TAG=2150
    BACKEND=triton_experimental

    python auto_board/process_raw_data.py \
      bench "$BACKEND" "$DATE" "$PACKAGE_TAG" \
      --extension default --action run

    python auto_board/process_raw_error.py --date "$DATE"
    python auto_board/process_raw_log.py --date "$DATE"

HuggingFace 和 TIMM 分别处理：

    python auto_board/process_raw_data.py huggingface "$BACKEND" "$DATE" "$PACKAGE_TAG" --extension default --action run
    python auto_board/process_raw_data.py timm "$BACKEND" "$DATE" "$PACKAGE_TAG" --extension default --action run

生成后端按日期 JSON：

    python auto_web/aggregate_backend_daily_data.py \
      --backend "$BACKEND" \
      --logical-date "$DATE" \
      --include-date "$DATE" \
      --web-data-dir "$(pwd)/board_file/web_data" \
      --output-root "$(pwd)/auto_web/website"

通常生成：

    auto_web/website/triton_experimental/<DATE>.json
    auto_web/website/triton_experimental/manifest.json

manifest.json 必须保留历史日期，不能只发布当天文件覆盖历史。

失败模型的网页 JSON 只保留 error_category、error_title、脱敏 error_excerpt、status 和环境摘要。禁止发布原始 log_path、完整日志、服务器用户名路径、容器 ID、token 或代理地址。

## 10. 常见故障处理

### 10.1 torch._inductor 模块缺失

    python -c 'import torch; print(torch.__file__, torch.__version__)'
    python -c 'import torch_npu; print(torch_npu.__file__, torch_npu.__version__)'
    python -c 'import torch._dynamo, torch._inductor; print("inductor ok")'

清理 PYTHONPATH 中指向未编译源码的路径，重新激活环境，再做 compile smoke。

### 10.2 HuggingFace / TIMM 下载失败

    env | grep -E 'HF_HOME|TRANSFORMERS_CACHE|HUGGINGFACE|TORCH_HOME|PROXY'
    find "$HF_HOME" -type f | head
    find "$TORCH_HOME" -type f | head

缓存缺失就补缓存，网络失败就使用批准代理或离线传输。不要把 HF_HUB_OFFLINE=1 全局设置后再误判为后端失败。

### 10.3 数据缺失

检查 TORCHBENCH_DATA_PATH、仓内软链和模型代码实际读取位置。优先修路径或补数据，不要修改模型源码绕过缺失资源。

### 10.4 OOM

先确认是否多进程抢卡、旧 compile cache 未清理、共享内存不足或模型确实超出显存。单模型使用空卡验证，再并行。

### 10.5 timeout

    tail -200 board_file/raw_data/<DATE>/**/board_log/*.log

网络等待、首次编译和真实卡死分开处理。只对确认需要更长编译时间的模型提高 timeout。

### 10.6 profile 过大

保持 warmup / active 轻量 profile。profile 和 compile debug 只保留问题分析所需模型，正常流水后按日期清理，不要上传 Git 或网站。

## 11. 最终验收清单

    [ ] npu-smi 正常，驱动与硬件匹配
    [ ] CANN 9.2.0 set_env.sh 可 source
    [ ] Python ABI 与 wheel 一致
    [ ] torch / torch_npu / torchvision 版本和 commit 有记录
    [ ] Triton-Ascend 版本、架构和 Python tag 匹配
    [ ] PTA runner 与目标 torch_npu 版本对应
    [ ] benchmark checkout 到 fb146299...
    [ ] local_paths.yaml 已换成目标机路径
    [ ] TorchBench 数据和必要软链存在
    [ ] HF / TIMM / Torch Hub 缓存可读
    [ ] DVM compile smoke 通过
    [ ] Triton-Experimental compile smoke 通过
    [ ] daily 单模型生成 log 和 profile
    [ ] process_raw_data.py 生成 web_data JSON
    [ ] process_raw_error.py 生成脱敏错误摘要
    [ ] manifest 保留历史日期
    [ ] 没有把密码、token、代理凭据或用户名路径发布到 Git/JSON

完成 smoke 和产物检查后，才启动 40 模型 daily 或 154 模型 weekly。

## 12. 回传给维护者的信息

不要回传完整 profile 或包含隐私的日志，只回传摘要：

    hardware / soc:
    driver:
    CANN:
    python:
    torch:
    torch_npu:
    torch_npu commit:
    torchvision:
    triton-ascend:
    official benchmark commit:
    PTA commit:
    pipeline commit:
    run date:
    backend:
    model set:
    pass / fail / timeout / oom counts:
    first failing model and sanitized error category:
