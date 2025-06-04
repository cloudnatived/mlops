
一、为什么选择DeepSeek+Dify黄金组合？
1.1 企业级部署三大刚需解决方案：
1️⃣ 安全闭环：本地离线部署+数据物理隔离
2️⃣ 成本革命：16G显存即可运行7B模型
3️⃣ 敏捷开发：可视化工作流10分钟搭建AI应用

1.2 典型应用场景：
✔ 金融领域智能客服
✔ 医疗数据隐私分析
✔ 教育行业定制化教学
✔ 制造业知识库管理

二、部署环境准备指南
附Windows/Mac/Linux全平台配置方案


| 组件 | 最低配置         | 推荐配置  |
| ---- | ---------------- | --------- |
| GPU  | NVIDIA T4 (可选) | RTX 4090  |
| 显存 | 16GB             | 24GB      |
| 内存 | 16GB DDR4        | 32GB DDR5 |
| 存储 | 50GB SSD         | 1TB NVMe  |


2.1 硬件配置说明
1. 硬件配置清单
✅ 最低配置：
CPU：2核以上（推荐Intel Xeon系列）
内存：16GB DDR4
GPU：NVIDIA T4（可选）
存储：50GB SSD
✅ 推荐配置：
CPU：4核+（AMD EPYC系列）
显存：24GB（RTX 4090）
内存：32GB DDR5
网络：千兆内网

✅ 本次实验配置：
CPU： Intel(R) Xeon(R) CPU E5-2696 v4 @ 2.20GHz
显存：16GB（Tesla V100-PCIE-16GB） * 3
内存：256GB DDR4
网络：千兆内网

2. 软件环境全攻略
📦 必装组件：
• Docker 24.0+
• Docker Compose 2.20+
• Ollama 0.5.5+
• Nvidia驱动535+（GPU加速需CUDA 12）
💻 多平台安装要点：

```
# Linux专项配置（Ubuntu示例）
sudo apt-get install -y nvidia-container-toolkit
sudo systemctl restart docker

# Windows特别提示
需启用WSL2并设置内存限制：
[wsl2]
memory=16GB
swap=0
三、部署核心组件（含路径/端口定制）
3.1 Ollama 配置
1. Ollama深度配置
# 自定义安装路径（以/data为例）
mkdir -p /data/ollama && export OLLAMA_MODELS="/data/ollama/models"

# 启动服务指定端口（默认11434）
OLLAMA_HOST=0.0.0.0:11435 ollama serve &

# 模型下载加速技巧
export OLLAMA_MIRROR="https://mirror.example.com"
ollama run deepseek-r1:7b

# 国内镜像源配置（速度提升10倍+）
export OLLAMA_MIRROR=https://mirror.ghproxy.com/
ollama run deepseek-r1:7b
2. 避坑版Ollama安装
# Windows特别版（解决路径含中文问题）
setx OLLAMA_MODELS "D:\ollama_models"
curl -L https://ollama.com/download/OllamaSetup_zh.exe -o ollama.exe
./ollama.exe
# 出现安全提示时选择"允许所有连接"

# Mac/Linux一键脚本（已处理权限问题）
curl -fsSL https://ollama.com/install.sh | sudo env PATH=$PATH sh
sudo systemctl enable ollama
3. 组件连通性测试
# 验证Ollama服务
curl http://localhost:11434/api/tags

# 检查Dify容器
docker exec -it dify-api bash
ping host.docker.internal
3.2 Dify 部署方案
1. Dify高级部署方案
# 指定部署路径（原docker目录可自定义）
git clone https://github.com/langgenius/dify.git /opt/ai-platform/dify
cd /opt/ai-platform/dify/docker


# 小编自定义路径为 /data1/home/datascience/item/ai-platform/dify


# 关键配置文件修改（.env示例）
vim .env
---
# 端口绑定设置
HTTP_PORT=8080
WEBSOCKET_PORT=8081

# 数据持久化路径
DATA_DIR=/data1/home/datascience/item/ai-platform/dify_data

# 启动命令（后台运行）
docker compose up -d --build
image.png
image.png
dify路径位置

image.png
image.png
启动dify容器

image.png
image.png
在这个输出中，你应该可以看到包括 3 个业务服务 api / worker / web，以及 6 个基础组件 weaviate / db / redis / nginx / ssrf_proxy / sandbox 。

image.png
image.png
首先访问地址,进行初始化配置，记得替换为你的ip和端口，这里配置的第一个默认账号为超级管理员，切记注意保存。

image.png
image.png
输入账号密码，登录dify，进入配置

image.png
image.png
3.3 Dify平台深度集成指南
1. 模型接入关键步骤
📍 路径：设置 > 模型供应商 > Ollama
🔧 配置参数详解：
Model Name：deepseek-r1:7b（需与Ollama模型名完全一致）
Base URL：
- 物理机部署：http://主机IP:11434
- Docker网络：http://host.docker.internal:11434
Temperature：0.7（对话类建议0-1）
Max Tokens：4096（7B模型实测上限）
image.png
image.png
点击 ollama 选择安装

image.png
image.png
点击添加模型

image.png
image.png
开始添加LLM模型，输入模型名称，类型，URL 为需要接入的模型server，例如本地部署的deepseek，当然你也可以接入其他api。例如deepseek官网，豆包，通义千问等。
image.png
image.png
3.4 应用创建
创建空白应用，聊天助手，命名好你的应用名称

image.png
image.png
测试AI助手的使用，正常对话查看模型调用

image.png
image.png
3.5 企业级安全加固方案
🔒 传输加密：

# 反向代理配置示例（Nginx）
server {
    listen 443 ssl;
    server_name ai.example.com;
    
    ssl_certificate /path/to/cert.pem;
    ssl_certificate_key /path/to/key.pem;
    
    location / {
        proxy_pass http://localhost:8080;
        proxy_set_header Host $host;
    }
}
3.6 实战案例：10分钟构建智能客服系统
1. 基础版Chatbot搭建
[创建应用] → [对话型] → 命名"DeepSeek客服助手"
↓
[模型选择] → Ollama → deepseek-r1:7b
↓
[提示词工程]：
"你是一名专业的客服助手，回答需符合以下要求：
1. 使用{{用户语言}}应答
2. 引用知识库：{{上传的PDF内容}}
3. 禁止透露模型身份"
2. 高级工作流设计

咨询类

技术问题





用户提问
意图识别
知识库检索
转接API
生成回复
敏感词过滤
返回结果
3.7 避坑大全：高频问题解决方案
1. 端口冲突终极处理
# 查看端口占用
lsof -i :11434

# 批量释放Dify资源
docker compose down --volumes --remove-orphans

# 强制重建服务
docker compose up -d --force-recreate
2. 模型加载异常排查
# 查看Ollama日志
journalctl -u ollama -f

# 验证模型完整性
ollama ls
ollama show deepseek-r1:7b --modelfile
3. 性能优化参数（7B模型实测）
# docker-compose覆盖配置
services:
  api:
    environment:
      - WORKER_COUNT=4
      - MODEL_LOAD_TIMEOUT=600
    deploy:
      resources:
        limits:
          cpus: '2'
          memory: 8G
 
```
