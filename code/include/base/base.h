#ifndef CODE_INCLUDE_BASE_BASE_H
#define CODE_INCLUDE_BASE_BASE_H

#include <glog/logging.h>
#include <cstdint>
#include <string>

// UNUSED 宏：显式标记未使用的参数，消除编译器警告
#define UNUSED(expr) do { (void)(expr); } while (0)

#define CUDA_CHECK(expr)                                                                    \
    do {                                                                                    \
        cudaError_t err = (expr);                                                           \
        LOG_IF(FATAL, err != cudaSuccess) << "CUDA error: " << cudaGetErrorString(err);     \
    } while (0)

namespace model {
enum class ModelBufferType : uint8_t {
    TokenIds = 0,           // 输入 token ids
    TokenPosition = 1,      // 输入 token 的位置
    TokenEmbeddings = 2,    // 输入 token 的嵌入
    SinCache = 3,           // RoPE 位置编码 Sin Cache 预计算
    CosCache = 4,           // RoPE 位置编码 Cos Cache 预计算
    MHAPreRMSNorm = 5,      // 每个 Transformer Block 中执行 MHA 之前的 RMSNorm 结果
    Query = 6,              // 注意力机制 Query 向量
    KeyCache = 7,           // 注意力机制 Key Cache
    ValueCache = 8,         // 注意力机制 Value Cache
    KVSplitOutput = 9,      // 在 FlashDecoding 中 kv-split 的局部结果 (m, l, o)
    MHAOutput = 10,         // 多头注意力输出: (softmax (QK^T)/sqrt(d)) V
    AttentionOuput = 11,    // 注意力机制最终经过 Wo 映射输出: MHA * Wo
    FFNPreRMSNorm = 12,     // 每个 Transformer Block 中执行 FFN 之前的 RMSNorm 结果
    FFNW1Output = 13,       // FFN 门控投影层 Gate Projection (SiLU 激活)
    FFNW2Output = 14,       // FFN 下降投影层 Down Projection (将维度映射回 dim)
    FFNW3Output = 15,       // FFN 上升投影层 Up Projection (通常与 Gate 做点乘)
    Logits = 16,            // 词表原始分数分布 Logits
    ArgmaxToken = 17,       // 贪心采样 token id
    ArgmaxBuffer = 18,      // 贪心采样中间结果缓存 buffer
    SwiGLUOutput = 19,      // Gate/Up Proj + SwiGLU 融合算子输出向量
    ResidualAdd = 20,       // Attention / FFN 每次 Pre RMSNorm 之前的输入向量
    TokenPositionCu = 21,   // Device 上的 token 位置 (CUDA Graph 下 kernel 从 device 读 pos)
};
}  // namespace model

namespace base {
enum class DeviceType : uint8_t {
    DeviceUnknown = 0,
    DeviceCUDA = 1,
    DeviceCPU = 2,
};

enum class DataType : uint8_t {
    DataTypeUnknown = 0,
    DataTypeFp32 = 1,   // 单精度浮点 FP32
    DataTypeBf16 = 2,   // 半精度浮点 BF16
    DataTypeFp16 = 3,   // 半精度浮点 FP16
    DataTypeInt32 = 4,  // 32 位整数 INT32
    DataTypeInt4x8 = 5, // 用 1 个 INT32 打包 8 个 INT4
};

enum class ModelType : uint8_t {
    ModelTypeUnknown = 0,
    ModelTypeQwen3 = 1,
    ModelTypeLlama2 = 2,
    ModelTypeLlama3 = 3,
};

inline size_t data_type_size(DataType data_type) {
    if (data_type == DataType::DataTypeBf16 || data_type == DataType::DataTypeFp16) {
        return sizeof(uint16_t);
    } else if (data_type == DataType::DataTypeFp32 || data_type == DataType::DataTypeInt32 || data_type == DataType::DataTypeInt4x8) {
        return sizeof(int32_t);
    } else {
        LOG(FATAL) << "Unknown data type size for " << int(data_type) << std::endl;
        return 0;
    }
}

// 禁止拷贝，防止对象被意外拷贝，作为基类继承
class NoCopyable {
protected:
    NoCopyable() = default;                             // 默认构造函数
    ~NoCopyable() = default;                            // 默认析构函数
    NoCopyable(const NoCopyable&) = delete;             // 禁止拷贝构造
    NoCopyable& operator=(const NoCopyable&) = delete;  // 禁止拷贝赋值
};

// 统一的错误码系统
enum class StatusCode : uint8_t {
    Success = 0,               // 成功
    FunctionUnImplement = 1,   // 功能未实现
    PathNotValid = 2,          // 路径无效
    ModelParseError = 3,       // 模型解析错误
    InternalError = 5,         // 内部错误
    KeyValueHasExist = 6,      // 键值已存在
    InvalidArgument = 7,       // 无效参数
};

enum class TokenizerType : int8_t {
    EncodeUnknown = -1,
    EncodeSpe = 0,      // SentencePiece 分词器
    EncodeBpe = 1,      // BPE 分词器
};

class Status {
public:
    Status(StatusCode code = StatusCode::Success, std::string err_msg = "");
    Status(const Status& other) = default;
    Status& operator=(const Status& other) = default;
    Status& operator=(StatusCode code);
    bool operator==(StatusCode code) const;
    bool operator!=(StatusCode code) const;
    operator int() const;
    operator bool() const;
    StatusCode get_err_code() const;
    const std::string& get_err_msg() const;
    void set_err_msg(const std::string& err_msg);
private:
    StatusCode code_ = StatusCode::Success;
    std::string err_msg_;
};

namespace error {
// 1. 执行传入的函数 call，并将返回的 Status 赋值给常量引用
// 2. 检查 Status 是否为失败状态
// 3. 定义一个 512 字节的字符数组，用于存储错误信息
// 4. 格式化错误信息到 buf 中（关键：包含文件、行号、错误码、错误描述）
#define STATUS_CHECK(call)                                                                  \
    do {                                                                                    \
        const base::Status& status = call;                                                  \
        if (!status) {                                                                      \
            const size_t buf_size = 512;                                                    \
            char buf[buf_size];                                                             \
            snprintf(buf, buf_size,                                                         \
                     "Infer error\n File: %s Line: %d\n Error code: %d\n Error msg: %s\n",  \
                     __FILE__, __LINE__, int(status), status.get_err_msg().c_str());        \
            LOG(FATAL) << buf;                                                              \
        }                                                                                   \
    } while(0)

Status success(const std::string& err_msg = "");
Status function_not_implement(const std::string& err_msg = "");
Status path_not_valid(const std::string& err_msg = "");
Status model_parse_error(const std::string& err_msg = "");
Status internal_error(const std::string& err_msg = "");
Status key_has_exits(const std::string& err_msg = "");
Status invalid_argument(const std::string& err_msg = "");
}  // namespace error

std::ostream& operator<<(std::ostream& os, const Status& status);
}  // namespace base

#endif  // CODE_INCLUDE_BASE_BASE_H