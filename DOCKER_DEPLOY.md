# Docker 部署说明

## 服务组成

`docker-compose.yml` 当前部署 4 个服务：

| 服务 | 作用 | 对外端口 |
| --- | --- | --- |
| `paddleocr-vlm-server` | VLLM 推理，加载 `PaddleOCR-VL-1.6-0.9B` | 无 |
| `paddleocr-vl-api` | PaddleX layout-parsing API | `8081:8080` |
| `paddleocr-ocr-api` | PaddleX OCR API，默认使用 PP-OCRv6 | `8082:8080` |
| `pandocr-web` | WebUI、FastAPI 代理、Office 转 PDF | `8000:8000` |

单 GPU 部署默认只热加载一个模型：`pandocr-web` 挂载 Docker socket，并通过 Docker Engine API 启停本 compose 文件中的模型容器。选择 `PaddleOCR-VL 1.6` 会启动 `paddleocr-vlm-server` + `paddleocr-vl-api` 并停止 `paddleocr-ocr-api`；选择 `PP-OCRv6` 会反向切换。Docker socket 等同于宿主机管理权限，请勿把 WebUI 暴露给不可信网络。
解析历史会通过 `./data:/app/data` 挂载保存到宿主机，默认路径为 `data/tasks/`。

## 推荐配置

先按显卡型号选择环境文件：

| 显卡 | 推荐环境文件 | `API_IMAGE_TAG_SUFFIX` / `VLM_IMAGE_TAG_SUFFIX` |
| --- | --- | --- |
| RTX 30 系列 | `env.docker` | `latest-nvidia-gpu-offline` |
| RTX 40 系列 | `env.docker` | `latest-nvidia-gpu-offline` |
| RTX 50 系列 / Blackwell | `env.txt` | `latest-nvidia-gpu-sm120-offline` |

`env.txt` 是 RTX 50 / Blackwell 推荐配置：

```text
API_IMAGE_TAG_SUFFIX=latest-nvidia-gpu-sm120-offline
VLM_BACKEND=vllm
VLM_IMAGE_TAG_SUFFIX=latest-nvidia-gpu-sm120-offline
PANDOCR_GPU_DEVICE_ID=0
PADDLEOCR_VL_MODEL_NAME=PaddleOCR-VL-1.6-0.9B
PPOCR_V6_MODEL_NAME=PP-OCRv6_medium
PANDOCR_MODEL_CONTROL=docker
PANDOCR_ACTIVE_MODEL_ON_START=paddleocr-vl-1.6
PANDOCR_MODEL_SWITCH_TIMEOUT=1200
PADDLE_REQUEST_TIMEOUT=3600
PANDOCR_CORS_ORIGINS=http://localhost:8000,http://127.0.0.1:8000
PANDOCR_MAX_UPLOAD_MB=512
PANDOCR_MAX_CONCURRENT_OCR=1
PANDOCR_ENFORCE_ORIGIN_CHECK=1
PANDOCR_API_TOKEN=
PANDOCR_ENABLE_API_DOCS=0
```

RTX 30/40 系列等非 Blackwell NVIDIA GPU 使用 `env.docker`，或把两个镜像标签改为：

```text
latest-nvidia-gpu-offline
```

下文命令以 `env.txt` 为例；如果你使用 RTX 30/40 系列，请把命令中的 `env.txt` 换成 `env.docker`。

## 启动与停止

Windows + NVIDIA 用户推荐直接运行一键部署脚本：

```powershell
.\windows-one-click.bat
```

脚本会自动选择环境文件、清理旧容器、创建模型容器但只启动 WebUI，然后等待默认活跃模型健康。

### WSL 下的手动启停指南
如果你在 Windows 下使用 WSL，可以直接在 PowerShell 中通过 `wsl bash -c` 前缀来无缝管理服务。因为采用了单卡动态切模型的架构，**切勿直接使用 `up -d` 启动所有容器**，这会导致显存 OOM。

**1. 日常启动（只启动 WebUI，模型由 WebUI 动态调度）**
```powershell
wsl bash -c "docker-compose --env-file env.txt up -d --no-start"
wsl bash -c "docker-compose --env-file env.txt start pandocr-web"
```

**2. 彻底停止并释放资源**
```powershell
wsl bash -c "docker-compose --env-file env.txt down"
```

**3. 重启 Web 服务（更新代码后）**
前端、FastAPI 或文档预览逻辑变更后，只需要重建并重启 `pandocr-web`：
```powershell
wsl bash -c "docker compose --env-file env.txt build pandocr-web"
wsl bash -c "docker compose --env-file env.txt up -d --no-deps --force-recreate pandocr-web"
```

**4. 常用监控排错命令**
```powershell
# 查看所有容器健康状态
wsl bash -c "docker ps -a"

# 查看 Web 后端日志
wsl bash -c "docker logs -f pandocr-web"

# 查看大模型推理日志
wsl bash -c "docker logs -f paddleocr-vlm-server"
```

## 健康检查

```powershell
wsl bash -c "docker ps"
curl http://localhost:8000/api/models
curl http://localhost:8000/api/model-runtime
curl http://localhost:8081/health
```

默认情况下只有 `PaddleOCR-VL 1.6` 会启动，`PP-OCRv6` 的健康检查不通是正常的。切到 `PP-OCRv6` 后，`8082/health` 会变为可用，`8081/health` 会进入 standby。解析正在运行时模型切换会返回 `409`，避免长任务中途被停容器打断。

如果要通过反向代理、局域网或公网暴露 WebUI，请设置 `PANDOCR_API_TOKEN`。`PANDOCR_ENFORCE_ORIGIN_CHECK=1` 会拒绝未加入来源白名单的跨站 API 写请求，但它不能替代 token；前端会在 API 返回 401 时提示输入 token。`PANDOCR_ENABLE_API_DOCS=1` 时才启用 `/docs` 和 `/redoc`。

`/api/models` 应返回：

```json
{"default":"paddleocr-vl-1.6","data":[{"id":"paddleocr-vl-1.6","name":"PaddleOCR-VL-1.6-0.9B"},{"id":"pp-ocrv6","name":"PP-OCRv6_medium"}],"originProtection":true,"maxConcurrentOcr":1}
```

## 常见问题与网络排错

### WSL/内网环境下载模型超时
在受限内网环境或 Windows WSL 中，PaddleX 容器内置的自动模型下载可能会遇到 DNS 解析失败（`Temporary failure in name resolution`）或下载卡住的情况，导致容器启动陷入 `health: starting` 的死循环。

**现象：**
- WebUI 顶部一直显示 `启动中`。
- 执行 `docker logs paddleocr-vl-api` 或 `paddleocr-vlm-server` 看到 `FileNotFoundError: [Errno 2] No such file or directory`。

**解决办法（手动下载权重）：**
建议在宿主机（Windows 或 WSL 原生环境）中手动下载并解压权重到挂载目录。

1. 大模型权重下载（使用 ModelScope）：
```bash
pip install modelscope
python -c "from modelscope import snapshot_download; snapshot_download('PaddlePaddle/PaddleOCR-VL-1.6', local_dir='model_cache/official_models/PaddleOCR-VL-1.6')"
```

2. 辅助小模型下载（PP-LCNet、UVDoc、PP-DocLayoutV3）：
编写 Python 脚本从百度云下载并解压：
```python
import urllib.request, tarfile
from pathlib import Path

models = [
    ("https://paddle-model-ecology.bj.bcebos.com/paddlex/official_inference_model/paddle3.0.0/PP-LCNet_x1_0_doc_ori_infer.tar", "model_cache/official_models/PP-LCNet_x1_0_doc_ori"),
    ("https://paddle-model-ecology.bj.bcebos.com/paddlex/official_inference_model/paddle3.0.0/UVDoc_infer.tar", "model_cache/official_models/UVDoc"),
    ("https://paddle-model-ecology.bj.bcebos.com/paddlex/official_inference_model/paddle3.0.0/PP-DocLayoutV3_infer.tar", "model_cache/official_models/PP-DocLayoutV3")
]
for url, path in models:
    Path(path).mkdir(parents=True, exist_ok=True)
    tar_path = Path(path) / "model.tar"
    urllib.request.urlretrieve(url, tar_path)
    tarfile.open(tar_path).extractall(path=path)
    tar_path.unlink()
```

*注意：`PP-DocLayoutV3_infer.tar` 解压后可能会多出一层同名子目录（`PP-DocLayoutV3_infer`），需要将里面的 `inference.yml` 等文件移动到 `model_cache/official_models/PP-DocLayoutV3/` 根目录。*

完成后重启受影响的容器：
```bash
docker-compose --env-file env.txt restart paddleocr-vlm-server paddleocr-vl-api
```

如果只改了挂载的 `static/` 或 `server.py`，也可以直接重建/重启：

```powershell
docker compose --env-file env.txt up -d --no-deps --force-recreate pandocr-web
```

## 本地任务数据

解析完成的任务会保存到 `data/tasks/`。这个目录已经加入 `.gitignore`，不会随代码提交。

如需清空历史，可以在 WebUI 侧边栏点击清空按钮，或删除本机目录后重启 Web 服务。

## 日志

```powershell
docker compose --env-file env.txt logs -f pandocr-web
docker compose --env-file env.txt logs -f paddleocr-vl-api
docker compose --env-file env.txt logs -f paddleocr-ocr-api
docker compose --env-file env.txt logs -f paddleocr-vlm-server
```

## 端口调整

修改 `docker-compose.yml`：

```yaml
pandocr-web:
  ports:
    - "18000:8000"

paddleocr-vl-api:
  ports:
    - "18081:8080"

paddleocr-ocr-api:
  ports:
    - "18082:8080"
```

## 数据和缓存

模型缓存通过目录挂载保留：

- `./model_cache:/home/paddleocr/.paddlex`：PaddleOCR-VL / PaddleX 缓存
- `./model_cache_ocr:/home/paddleocr/.paddleocr`：PaddleOCR-VL 相关缓存
- `./model_cache_ppocrv6:/home/paddleocr/.paddlex`：PP-OCRv6 / PaddleX 3.7 缓存
- `./model_cache_ppocrv6_ocr:/home/paddleocr/.paddleocr`：PP-OCRv6 相关缓存

这些缓存目录已加入 `.dockerignore`，不会被打进 `pandocr-web` 镜像构建上下文。

解析历史保存在 `./data/tasks/`。每个任务目录下 `task.json` 只保存轻量元数据，`summary.json` 用于快速列表，`result.json` 保存 Markdown、OCR JSON 和图片 base64。清空历史只删除合法 task id 子目录，不会递归删除整个 `data/`。

## 清理

```powershell
docker compose --env-file env.txt down
docker image prune
```

谨慎清理模型缓存目录；删除后下次启动会重新下载或加载模型资源。
