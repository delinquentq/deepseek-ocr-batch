# 🚀 DeepSeek OCR 批量处理系统

基于DeepSeek OCR的智能文档批量处理系统，支持PDF文档的OCR识别、双模型数据提取和结构化JSON输出。

## ✨ 主要特性

- 🔥 **批量PDF处理** - 支持多文件并行处理，高效稳定
- 🧠 **双模型对比** - Gemini 2.5 Flash + Qwen3-VL-30B智能选择最佳结果
- 🎯 **RTX 3090优化** - 针对24G显存专门优化的内存管理
- 📊 **图表无损提取** - 完整保留图表数据，支持可视化重建
- ✅ **严格数据验证** - 基于JSON Schema的完整性检查
- 🗄️ **数据库兼容** - 输出格式直接支持数据库导入

## 🎯 系统架构

```
PDF输入 → DeepSeek OCR → Markdown+图像 → 双模型处理 → JSON验证 → 数据库格式输出
```

## 🚀 快速开始

### 方法1: 自动化部署（推荐）

```bash
# 1. 上传到GitHub（本地执行）
git clone https://github.com/你的用户名/deepseek-ocr-batch.git

# 2. 服务器一键部署
ssh your-user@your-server
curl -fsSL https://raw.githubusercontent.com/你的用户名/deepseek-ocr-batch/main/server_deploy.sh | bash

# 3. 配置和启动
cd ~/deepseek-ocr-batch
vim .env  # 设置OPENROUTER_API_KEY
./start_service.sh
```

### 方法2: 手动安装

```bash
# 环境准备
conda create -n deepseek-ocr python=3.10 -y
conda activate deepseek-ocr

# 安装依赖
pip install torch==2.6.0 torchvision==0.21.0 --index-url https://download.pytorch.org/whl/cu118
pip install -r requirements_batch.txt
pip install flash-attn==2.7.3 --no-build-isolation

# 环境配置
export OPENROUTER_API_KEY=your_api_key
python test_batch_system.py

# 开始处理
python run_batch_processor.py
```

## 📁 项目结构

```
deepseek-ocr-batch/
├── batch_pdf_processor.py      # 主处理器
├── config_batch.py             # 配置管理
├── run_batch_processor.py      # 启动脚本
├── test_batch_system.py        # 系统测试
├── server_deploy.sh            # 服务器部署脚本
├── requirements_batch.txt      # 依赖包
├── json schema.json            # 数据验证Schema
├── input_pdfs/                 # PDF输入目录
├── output_results/             # 处理结果
├── temp_processing/            # 临时文件
└── logs/                       # 日志目录
```

## ⚙️ 配置说明

### 环境变量配置

```bash
# .env文件
OPENROUTER_API_KEY=your_openrouter_api_key
DEEPSEEK_OCR_MODEL_PATH=deepseek-ai/DeepSeek-OCR
CUDA_VISIBLE_DEVICES=0
VLLM_USE_V1=0
```

### 硬件优化配置

```python
# RTX 3090 24G 优化参数
BATCH_SIZE = 4                    # 每批处理页数
MAX_CONCURRENCY = 6               # 最大并发数
GPU_MEMORY_UTILIZATION = 0.75     # 显存利用率
NUM_WORKERS = 8                   # 预处理线程数
```

## 📊 使用示例

### 基础使用

```bash
# 检查环境
python run_batch_processor.py --setup

# 处理所有PDF
python run_batch_processor.py

# 处理指定文件
python run_batch_processor.py -f report1.pdf -f report2.pdf

# 跳过确认
python run_batch_processor.py -y
```

### 高级功能

```bash
# 后台运行
nohup python run_batch_processor.py > processing.log 2>&1 &

# 使用screen保持会话
screen -S deepseek-ocr
python run_batch_processor.py
# Ctrl+A, D 分离会话

# 监控处理状态
tail -f logs/batch_processor.log
watch -n 5 nvidia-smi
```

## 📈 输出格式

### 目录结构

```
output_results/
└── filename/
    ├── filename.md              # Markdown文本
    ├── filename_final.json      # 结构化JSON数据
    ├── images/                  # 提取的图表
    │   ├── 0_0.jpg             # 页面_图表序号
    │   └── 0_1.jpg
    └── processing_log.txt       # 处理日志
```

### JSON数据格式

严格遵循提供的schema，支持图表数据完整重建：

```json
{
  "_id": "unique_hash_id",
  "source": {
    "file_name": "document.pdf",
    "processing_metadata": {
      "vision_model": "deepseek-ai/DeepSeek-OCR",
      "synthesis_model": "google/gemini-2.5-flash",
      "processed_at": "2024-10-21T15:30:45Z",
      "pages_processed": 25,
      "successful_pages": 24
    }
  },
  "data": {
    "figures": [{
      "figure_id": "revenue_chart",
      "type": "bar_chart",
      "data": {
        "labels": ["Q1", "Q2", "Q3", "Q4"],
        "series": [{
          "name": "Revenue",
          "values": [100, 120, 135, 150],
          "unit": "$M"
        }]
      }
    }],
    "numerical_data": [...],
    "companies": [...],
    "key_metrics": [...]
  }
}
```

## 🔧 性能优化

### 显存优化

```python
# 显存不足时调整参数
config.hardware.BATCH_SIZE = 2
config.hardware.MAX_CONCURRENCY = 4
config.hardware.GPU_MEMORY_UTILIZATION = 0.6
```

### 速度优化

```python
# 提高处理速度
config.processing.MAX_CONCURRENT_PDFS = 3
config.api.REQUEST_TIMEOUT = 600
config.hardware.NUM_WORKERS = 16
```

## 🔍 监控和维护

### 系统监控

```bash
# GPU状态
nvidia-smi

# 处理日志
tail -f logs/batch_processor.log

# 系统资源
htop

# 存储使用
df -h
```

### 维护命令

```bash
# 更新代码
git pull origin main

# 重启服务
pkill -f "python.*run_batch_processor.py"
python run_batch_processor.py

# 清理缓存
rm -rf temp_processing/*
rm -rf logs/*.log

# 备份结果
tar -czf backup_$(date +%Y%m%d).tar.gz output_results/
```

## 🚨 故障排除

### 常见问题

| 问题 | 解决方案 |
|------|----------|
| 显存不足 | 降低`BATCH_SIZE`和`MAX_CONCURRENCY` |
| API调用失败 | 检查`OPENROUTER_API_KEY`配置 |
| JSON验证失败 | 检查`json schema.json`文件 |
| 依赖安装失败 | 重新安装：`pip install --force-reinstall -r requirements_batch.txt` |

### 性能基准

| 配置 | 处理速度 | 显存使用 | 成功率 |
|------|----------|----------|---------|
| RTX 3090 | 2-5分钟/PDF | 18-22GB | >95% |
| RTX 4090 | 1-3分钟/PDF | 16-20GB | >98% |
| A100 | 1-2分钟/PDF | 15-18GB | >99% |

## 🛠️ 开发指南

### 添加新模型

```python
# 在config_batch.py中添加
MODELS = {
    "gemini": "google/gemini-2.5-flash",
    "qwen": "qwen/qwen-2.5-vl-72b-instruct",
    "new_model": "provider/new-model-name"  # 新增模型
}
```

### 自定义验证规则

```python
# 在JSONSchemaValidator中扩展
def custom_validation(self, data):
    # 自定义验证逻辑
    pass
```

### 扩展输出格式

```python
# 在BatchPDFProcessor中添加
def export_to_database(self, data):
    # 数据库导出逻辑
    pass
```

## 📄 许可证

基于原DeepSeek-OCR项目，遵循相同的开源许可证。

## 🤝 贡献

欢迎提交Issue和Pull Request！

## 📞 技术支持

遇到问题请提供：
1. 系统配置：`python test_batch_system.py`
2. 错误日志：`logs/batch_processor.log`
3. 环境信息：`python run_batch_processor.py --setup`

---

**⭐ 如果这个项目对您有帮助，请给我们一个Star！**